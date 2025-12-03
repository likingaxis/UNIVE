## Rappresentazione della conoscenza
### Ingegneria ontologica
- L’**ingegneria ontologica** è la disciplina che si occupa di:
	- progettare modelli formali di conoscenza,
	- definire concetti e relazioni di un dominio,
	- strutturare questa conoscenza in modo da renderla **comprensibile, riutilizzabile e computabile** da sistemi artificiali.
In altre parole, è il processo con cui si costruisce un’**ontologia**
- **Le ontologie sono strutture formali che definiscono le categorie, le proprietà e le relazioni tra i concetti di un dominio specifico**
- le ontologie aiutano a organizzare la conoscenza in modo che possa essere facilmente utilizzata e condivisa tra diversi sistemi.
##### Ontologia superiore
- Il framework generale dei concetti prende il nome di ontologia superiore, per la convenzione di disegnare grafi con i concetti più generali in alto e quelli più specifici sotto di essi.
![[Pasted image 20251203171007.png]]
### Sistemi di ragionamento per categorie
Le **categorie** sono i mattoni fondamentali con cui si organizza la conoscenza.  
Servono per:
- raggruppare oggetti con proprietà comuni,
- costruire gerarchie concettuali (generale → specifico),
- permettere l’ereditarietà delle proprietà.
Sono essenziali per creare **basi di conoscenza su larga scala**.
##### Due famiglie di sistemi per usare le categorie
Esistono due modi principali di rappresentare e usare le categorie.
- ci tengo subito a precisare che in realtà servono entrambe
###### 1. Reti semantiche
- sono **visive**, intuitive, utili per rappresentare e navigare la conoscenza.
- Sono **grafi**: nodi = concetti, archi = relazioni.
- Permettono di **visualizzare** una base di conoscenza.
- Usano relazioni come **IS-A** (sottoclasse) per trasmettere proprietà tramite **ereditarietà**.
- Consentono inferenze semplici ed efficienti del tipo:  
    “Se _canarino_ è un _uccello_ e gli uccelli volano, allora un canarino vola.”
➜ Sono nate per modellare il **ragionamento valido**, prima in matematica, poi nel senso comune. 
###### 2. Logiche descrittive (Description Logics)
- sono **formali**, precise, utili per verificare, classificare, inferire.
_(approccio cognitivo-linguistico)_
- Sono **linguaggi formali** per _definire_ concetti e combinare categorie.
- Permettono di stabilire automaticamente:
    - se una categoria è sottoclasse di un’altra,
    - se una definizione è coerente,
    - come classificare nuovi concetti.
- Sono alla base delle ontologie moderne (OWL, Web Semantico).
➜ Nascono per capire **come la conoscenza è strutturata nella mente** e come può essere rappresentata in modo rigoroso.

### Reti semantiche spiegate in modo preciso
- Relazioni primitive sempre presenti:
	- **IS** → relazione di _sotto-classe_ (⊆)
	- **IS-A** → relazione di _appartenenza_ (∈)
- Le proprietà si associano ai **concetti più generali** e vengono **ereditate** dai concetti più specifici.
	- Esempio: se _Persona_ ha proprietà “ha due gambe”, allora **Mary**, essendo persona, la eredita.
	- L’algoritmo risale la gerarchia:  
		- individuo → categoria → super-categoria → … finché trova la proprietà.
![[Pasted image 20251203173659.png|400]]
##### ⚠️ Ereditarietà multipla
- Un concetto può appartenere a più categorie → possibile conflitto di proprietà.
- Richiede strategie per gestire valori incompatibili.
- Le **reti semantiche** funzionano bene quando una relazione ha **2 soli elementi** (binaria):
	- _IS-A(Pinguino, Uccello)_
	- _haColore(Mela, Rossa)_
Ma ci sono frasi o fatti del mondo che coinvolgono **più di due elementi**.
- qui si usano relazioni n-arie
	- **“Shankar vola da New York a Delhi ieri.”**
Questa frase contiene **4 partecipanti** e quindi si usa la reificazione
- **Reificare** significa **trasformare la frase in un oggetto/evento**.
	- Invece di collegare direttamente Shankar–NewYork–Delhi–Ieri, crei un nuovo nodo:
		- 👉 EventoDiVolo
			- Poi colleghi TUTTI i partecipanti a questo evento tramite ruoli specifici
			- così sono tutti collegati uno con l'altro ma partendo dall'oggetto evento di volo
![[Pasted image 20251203174010.png]]


#### Sono **riconducibili alla logica del primo ordine (FOL)**.
- *MAIUSCOLO = classi (categorie)*
- *minuscolo = individui (istanze)*
![[Pasted image 20251203174035.png]]
![[Pasted image 20251203174127.png]]
##### Modellare ragionamento default richiede logiche non monotone
- ragionamento default
	- È un tipo di ragionamento in cui si assumono cose **normalmente vere**, _a meno che_ non ci siano informazioni che le smentiscono.
- La logica classica (monotona) funziona così:
	-  Se aggiungi nuove informazioni, non puoi invalidare conclusioni vecchie.
![[Pasted image 20251203175218.png|500]]
Una logica **non monotona** è una logica che:
- permette di **ritirare conclusioni** quando arrivano nuove informazioni;
- gestisce **eccezioni**, **default**, **regole che non valgono sempre**.

### Wordnet
**WordNet** è una **grande risorsa lessicale** organizzata come una **rete semantica**.
- è un dizionario “intelligente” per i computer.
Contiene:
- **122.000 termini** (nomi, verbi, aggettivi, avverbi)
- organizzati in **117.000 synset**
📌 **Synset = insieme di sinonimi** che rappresenta un **concetto**.  
→ Una parola può appartenere a **più synset**, cioè può avere **più significati (sensi)**.
![[Pasted image 20251203175615.png]]
- Se diverse parole hanno lo **stesso significato**, WordNet le mette insieme.
- Dice quanti significati ha una parola
- Mostra le relazioni tra i concetti
### I Frame (Minsky, 1974)
I **frame** sono strutture mentali e strutture dati usate per rappresentare conoscenza “di senso comune”.
- Quando affrontiamo una **situazione nuova**, la mente richiama uno **stereotipo** (frame) già noto e lo **adatta** al caso specifico.  
- → È un modo per interpretare il mondo senza ripartire da zero ogni volta.
- tipo con i negri
Un frame è composto da:
###### ✔ **Slot–filler** (attributo → valore)
Esempio:
- stanza_d’albergo.prezzo = 100
- stanza_d’albergo.letti = 2
- I filler possono essere:
	- un **valore specifico**,
	- un **vincolo** o riferimento ad un altro frame,
	- un **valore default**,
	- una **procedura** da attivare:
	    - _if-added_ → se lo slot riceve un valore
	    - _if-needed_ → se si chiede il valore dello slot  
	        → chiamati _demoni_ (procedural attachments)
###### ✔ Gerarchia
Gli slot **IS** e **IS-A** permettono di costruire una tassonomia di frame (come classi e sottoclassi).
- I concetti del mondo reale **non hanno definizioni rigide**, come quelli matematici.  
	- Per esempio:
		- “Quadrilatero(x)” **sì** ha definizione necessaria e sufficiente.
		- “Uccello(x)” **no**: non tutti volano, esistono eccezioni.
	- I frame permettono di gestire queste **informazioni tipiche**, non assolute.

##### FrameNet
FrameNet è una risorsa linguistica basata sulla teoria dei frame.
Cosa contiene?
- **6000+ unità lessicali**
- **130.000 frasi annotate**
- Organizzata in **frame concettuali** (eventi, situazioni, ruoli)
- Idea fondamentale
Il **significato di una parola** deriva dal **ruolo** che essa svolge in un frame concettuale.
Esempio: nel frame _KILLING_ ci sono ruoli come **KILLER**, **VICTIM**, **INSTRUMENT**, ecc.
- comprendere strutture di significato,
- analizzare ruoli semantici nelle frasi,
- costruire sistemi NLP più intelligenti.
##### Google Knowledge Graph (GKG)
È un enorme **grafo di conoscenza** con entità collegate da relazioni semantiche.
- Migliora la ricerca Google
##### 🔹 Dimensioni
- **570 milioni di entità**
- **18 miliardi di relazioni**
###### 🔹 Fonti
Freebase, Wikipedia, CIA World Factbook e molte altre.
#### Sviluppo di Basi di Conoscenza (KB)
Le KB di larga scala possono essere costruite in diversi modi:
1. **Crowdsourcing da esperti**  
    (openCyc, SNOMED) – alta qualità, lento.
2. **Crowdsourcing da utenti comuni**  
    (Freebase, Wikidata) – molto ampio, qualità variabile.
3. **Giochi interattivi**  
    (ConceptNet) – acquisiscono conoscenza di senso comune.
4. **Estrazione da dati semi-strutturati**  
    (data mining da database relazionali).
5. **Compilazione da Web semi-strutturato**  
    (DBpedia, Google Knowledge Graph).
6. **Estrazione automatica da dati non strutturati**  
    (testi, immagini, video → DeepDive, OpenIE).
📌 **Nota:** Le KB non sono mai complete → l’AI cerca di **estenderle automaticamente**.
Un **Knowledge Graph (KG)** rappresenta i fatti del mondo come **triple**:
`(head, relation, tail)`
- **head** = entità di partenza
- **relation** = tipo di relazione
- **tail** = entità di arrivo
**Esempi:**
- (Roma, _capitaleDi_, Italia)
- (Einstein, _haScoperto_, Relatività)
KG famosi: **WordNet**, **Wikidata**.

➡️ Un KG è quindi un **grafo di entità collegate da relazioni semantiche**.
Nei modelli di machine learning:
- **entità** e **relazioni** sono trasformate in **vettori**.
- Il modello impara una regola del tipo:
`h + r ≈ t`
Cioè:  
**il vettore della relazione r porta h vicino a t**.
👉 Questo permette di **predire relazioni mancanti** e **completare automaticamente** il grafo.

![[Pasted image 20251203183730.png]]
