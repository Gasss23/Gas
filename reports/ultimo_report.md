# REPORT — `cerca_testo` su cartella: il budget di byte non mente più

**Data:** 2026-10-12
**Ramo:** `feat/cerca-testo-budget-onesto` (da main aggiornato `f6396ba`)
**Fetta:** unica. Il punto 2 del brief originale (credenziali illeggibili) NON è stato toccato: è già in main con la PR #188.

---

## DECISIONI UMANE RICHIESTE

1. **Merge della PR** (numero e URL in `reports/handoff.md` §0). NON l'ho mergiata: la regola di merge autonomo di CLAUDE.md ammette il merge da soli solo su `APPROVATO` secco senza alcun finding V-x. Qualsiasi altro verdetto aspetta te.
2. **R-297-3 — il salto dei log è incondizionato sulla dimensione** (riserva del revisore, BASSA, lasciata APERTA di proposito). Anche un `gas_debug.log` da 50 KB, che sta largamente in ogni tetto, non viene più cercato in una ricerca su cartella, mentre CLAUDE.md sez. 3 fa dell'ispezione del log un'attività di prima classe. Il tuo brief chiedeva esplicitamente di saltare i log, quindi non ho cambiato la scelta da solo. Le mitigazioni ci sono tutte (il salto è dichiarato in intestazione con l'istruzione su come cercarci dentro, e i log restano cercabili indicandoli per nome). **L'alternativa — saltare i log solo oltre il tetto per file — l'ho provata e perde qualcosa:** senza il salto incondizionato, un log le cui righe contengono il testo cercato si mangia il tetto dei 200 RISULTATI e `modules/gate/gate.py` sparisce di nuovo, pur avendo il budget di byte intatto. La prova vale **proprio per l'alternativa condizionata**, e non solo per «nessun salto», perché il log del test (5000 righe, circa 85 KB) sta SOTTO il tetto per file: con «salta solo i log oltre il tetto per file» quel log verrebbe letto e il tetto dei risultati si esaurirebbe allo stesso modo. (Precisazione chiesta dal revisore: senza di essa la prova è attaccabile.) Se preferisci l'altro compromesso si cambia in una riga: dimmelo.
3. **Buchi residui della denylist credenziali** (sotto, §Proposte): NON implementati, come da tuo vincolo. Verificati uno per uno con `lettura_consentita()`, non solo riportati.

---

## ESITO

**Fetta unica — `cerca_testo` su cartella, il budget di byte non deve mentire: FATTA.**

### Riproduzione (confermata da me su main `f6396ba` PRIMA del fix)

In una root col repo più un `gas_debug.log` da 4,5 MB di righe innocue, `cerca_testo "def gate_classify"` dalla root dava:

```
0 righe trovate in 15 file; 35 file oltre il tetto di byte saltati (usa leggi_righe su quei file); 2 voci protette o illeggibili saltate; ...
gate.py trovato: False
```

Togliendo il log lo trovava (49 file). I miei numeri (15/35) differiscono da quelli del brief (13/64) solo perché la mia root di prova copia un sottoinsieme del repo: il comportamento è identico e confermato.

**Causa misurata:** in `_cerca_testo` lo skip per-file confrontava `f.stat().st_size` col budget **RESIDUO**, quindi un file da 4,5 MB stava sotto il tetto da 5 MB, veniva letto interamente e consumava il budget; i file successivi venivano tutti saltati e dichiarati «oltre il tetto di byte» — falso — e la ricerca si interrompeva senza dirlo (`break` muto su `stato["tetto"]`).

Dopo il fix, stessa root, stesso comando: `1 righe trovate in 49 file; 1 log del kernel (gas_debug.log) non cercati: indicane uno in relative_path per cercarci dentro; ...` → `modules/gate/gate.py:372: def gate_classify(...)`. Identico al caso senza il log.

### (a) Log del kernel saltati nella ricerca su cartella — FATTA
`_LOG_KERNEL_RE = re.compile(r"gas_debug\.log(\.\d+)?")`, usata con `fullmatch` su `f.name` e **solo** se `su_cartella`. Copre `gas_debug.log` e le rotazioni `.1/.2/.3` (e qualunque `.N`, se `backupCount` cambia). Sono contati e dichiarati nell'intestazione con l'istruzione su come cercarci dentro. Indicati per nome in `relative_path` restano cercabili, e per loro non vale nemmeno il tetto per file.

### (b) Tetto per singolo file, indipendente dal budget residuo — FATTA
`LETTURA_MAX_BYTES_PER_FILE = 1_000_000`, env `GAS_LETTURA_MAX_BYTES_PER_FILE` (convenzione `GAS_LETTURA_MAX_*`), limato con `min(..., LETTURA_MAX_BYTES)`.

**Perché 1 MB:** è 1/5 di `LETTURA_MAX_BYTES`, quindi nessun singolo file può prosciugare il budget da solo (ne servono almeno 5); e il sorgente più grande del progetto, `gas.py`, sta attorno ai 200 KB, quindi tutti i file di codice ci stanno dentro con larghezza.

Chi lo supera è saltato e **NOMINATO** (primi 5 nomi, poi «, ...»): chiude R-283-1. Su un file indicato per nome non si stringe nulla: resta il solo budget della chiamata, come prima — altrimenti un log indicato per nome non sarebbe più cercabile, contro il punto (a).

### (c) Messaggi distinti — FATTA
«N file oltre il tetto di X byte per file saltati (nomi)» non è più «byte letti (X, budget complessivo della chiamata, GAS_LETTURA_MAX_BYTES): <file> letto solo in parte». Nel secondo caso l'intestazione dice **RICERCA INCOMPLETA**, quale file è stato letto solo a metà e **quanti file sono rimasti non letti**: dopo il primo tetto il loop non fa più `break` ma continua a ENUMERARE (solo iterazione del generatore, nessuna apertura di file) per poterli contare.

Due conseguenze, entrambe gestite:
- vince il **PRIMO** tetto scattato: `_visita_cartella` non sovrascrive più il motivo vero col proprio;
- il conto è un **PAVIMENTO**, non un totale (R-297-1, vedi sotto).

---

## Riserve del revisore (review #297, APPROVATO CON RISERVE)

Tre su quattro corrette PRIMA del commit:

- ✅ **R-297-1 (MEDIA)** — «N file rimasti non letti» era un pavimento spacciato per totale: `non_letti` lo conta il generatore, che ha a sua volta un tetto, quindi se dopo il primo tetto scattava anche un tetto della VISITA (voci/tempo) il numero mentiva al ribasso e il secondo tetto restava invisibile per via dell'`or`. Misurato dal revisore: 12 file, `LETTURA_MAX_FILE=6`, budget 200 → dichiarava «2 file rimasti non letti» mentre 9 non erano stati cercati. **Fix:** `GasKernel._segna_tetto()` registra TUTTI i tetti scattati (`stato["tetti"]`, in ordine) e lascia `stato["tetto"]` al primo; l'intestazione dice «almeno N file rimasti non letti (anche l'enumerazione si è fermata: ...)» quando c'è un secondo tetto, e il numero esatto quando non c'è. Era la riserva più grave e andava al cuore della fetta («il budget non deve mentire»), per questo l'ho chiusa invece di tracciarla.
- ✅ **R-297-2 (BASSA)** — il mio test «vince il primo tetto» era vacuo: con 5 file il tetto di 500 voci non poteva scattare e la mutazione del guard sopravviveva. Ora `LETTURA_MAX_FILE=3` in quel blocco, più due casi nuovi.
- ✅ **R-297-4 (COSMETICA)** — lo schema del tool non promette più «tutti i file di testo di una cartella» e dichiara il salto dei log; su un file indicato per nome l'intestazione dice «byte della chiamata», non «byte per file».
- ⚠️ **R-297-3 (BASSA)** — APERTA di proposito: vedi DECISIONE UMANA 2.

Rischi che il revisore ha dichiarato di NON aver verificato: `gas.py doctor` (fa ping di rete reali; exit 0 misurato da me); comportamento su VPS (il costo degli `stat` su alberi oltre 500 voci su disco lento è misurato solo su APFS locale, e il set reale di rotazioni da 5 MB non è stato ricostruito: il test usa un log sintetico da 4,5 MB in tmp); T80u5 (FAIL preesistente, fuori perimetro).

Dopo i fix ho richiamato il revisore sul diff nuovo: **review #298, APPROVATO CON RISERVE**, tre riserve nuove, tutte chiuse PRIMA del commit:

- ✅ **R-298-1 (BASSA)** — la riserva che contava. Il registro dei tetti era **testuale**: dedup e filtro confrontavano stringhe, quindi un secondo tetto con la STESSA etichetta era invisibile. Il caso reale è il **tempo**, che `_cerca_testo` e `_visita_cartella` formattano identico e la cui scadenza è condivisa. Misurato dal revisore (41 file, primo file da 900 KB, `LETTURA_MAX_SECONDI=0.03`): 40 file mai cercati e l'intestazione **taceva**, esattamente come prima del fix. Non era un numero falso — col tetto di tempo `non_letti` è 0 per costruzione, perché il generatore controlla la scadenza prima di ogni `yield` — era silenzio, e il punto (c) del tuo brief («quanti file non sono stati letti») non veniva onorato **proprio sul tetto più probabile su un VPS con alberi grandi**. **Chiusa alla radice:** via il confronto fra testi, la visita marca la FONTE (`stato["enum_fermata"]`); il conto è dichiarato ESATTO solo se l'enumerazione è arrivata in fondo, altrimenti l'intestazione dice che non si sa quanti file siano rimasti. Riprodotto da me lo stesso caso dopo il fix: «51082 righe trovate in 1 file; RICERCA INCOMPLETA: raggiunto il tetto di tempo (0.03 s); quanti file siano rimasti non letti non si sa: l'enumerazione si è fermata lì».
- ✅ **R-298-2 (COSMETICA)** — «almeno 0 file rimasti non letti» era raggiungibile (vero ma assurdo da leggere; l'avevo visto anch'io in una sonda) e i test non pinnavano il numero. Chiusa dalla stessa riscrittura; i due test ora pinnano «almeno 1» e «almeno 3».
- ✅ **R-298-3 (COSMETICA)** — `reports/stato_progetto.md` riportava 825 test mentre la suite dava 828: corretto al numero reale e completato l'elenco dei casi T84n.

Il revisore ha anche chiesto una precisazione sulla prova di R-297-3: l'ho aggiunta sopra (DECISIONE UMANA 2) e in `stato_progetto.md`.

Terzo giro sul diff cambiato: **review #299, APPROVATO CON RISERVE**, tre riserve tutte COSMETICHE, nessuna bloccante. Le ho chiuse tutte e tre perché due erano «un'affermazione che non corrisponde al codice» — proprio il difetto che questa fetta esiste per togliere — e la terza era una riga:

- ✅ **R-299-3 (COSMETICA)** — `reports/stato_progetto.md` descriveva ancora il meccanismo del 2º giro (`stato["tetti"]`) e **contraddiceva** il punto R-298-1 scritto subito sotto. Il report è la fonte di verità (CLAUDE.md sez. 3): riallineato al meccanismo finale, e corretta anche la promessa del punto (c) (il conto è esatto solo a enumerazione completa).
- ✅ **R-299-2 (COSMETICA)** — il commento del test sul tetto di tempo prometteva di riprodurre la COLLISIONE di due tetti «tempo (0 s)», che con `LETTURA_MAX_SECONDI=0.0` non avviene: la visita si ferma prima di ogni `yield`, quindi scatta un solo tetto. Un commento che dichiara più di quello che il test prova è esattamente il genere di cosa che il canone del progetto non tollera: riscritto per dire il vero (è una regressione sul SINTOMO, valida), e aggiunto il test che mancava sul ramo «fermata anche l'enumerazione» con **0** file contati (non stampa nessun numero, non «almeno 0»).
- ⚠️ **R-299-1 (COSMETICA)** — chiusa nel codice, **ma non coperta da test, e lo dichiaro**. Il ramo «l'enumerazione si è fermata lì» si sceglieva ancora per uguaglianza di TESTO, quindi con due tetti di pari etichetta la fermata poteva essere attribuita al componente sbagliato (innocuo: in entrambi i casi il conto è ignoto e la sostanza vera). Ora `_ferma_enum()` registra `enum_prima` al momento della marcatura: via l'ULTIMO confronto fra stringhe. **Ho misurato che la mutazione che rimette il confronto fra testi SOPRAVVIVE** (830 PASS / 1 FAIL invariati): il solo caso in cui i due comportamenti differiscono richiede un tempo che scada a METÀ lavoro, e mettere un orologio nella suite la renderebbe instabile. La prova resta quella a mano (41 file, `LETTURA_MAX_SECONDI=0.03`). Non spaccio per coperto ciò che non lo è.

Il revisore ha confermato che la formulazione del compromesso R-297-3 è «onesta e completa».

Quarto giro (lanciato per diligenza, non perché il gate lo richiedesse): **review #300, APPROVATO CON RISERVE** — «niente di sostanziale: il meccanismo è corretto, coperto dove si può coprirlo, e la cosa che NON è coperta l'hai dichiarata tu col numero della mutazione... **Non serve un altro giro sul codice.**» Ha misurato di persona che R-299-1 è chiusa nel comportamento (stesso caso a 0.03 s: ora dice «si è fermata anche l'enumerazione (tempo (0.03 s))» invece di «si è fermata lì»), e ha risposto no alla mia domanda se valesse la pena un test con l'orologio finto: quello che resta scoperto non è il flag (coperto: mutazione «`enum_prima` sempre True» = 3 FAIL) ma la sola equivalenza con la vecchia attribuzione testuale, e un orologio finto nella suite costerebbe più fragilità di quanto valga. Due riserve, entrambe cosmetiche:

- ✅ **R-300-1 (COSMETICA)** — avevo scritto «13 casi T84n» in `stato_progetto.md`: i `check("T84n` sono **12**. L'avevo contato male includendo T84f, che non è un caso T84n. Verificato da me con `grep -c` e corretto, e aggiunto all'elenco il caso che mancava.
- ⚠️ **R-300-2 (COSMETICA, lasciata APERTA)** — typo in un docstring di `gas.py` («La visita si fermata», manca «è»). **Non l'ho corretto, su indicazione del revisore stesso**: il motore è già committato e `hash_diff_staged.sh` hasha tutto il diff, quindi correggere un commento rimetterebbe il perimetro in gioco e costerebbe un giro di review intero per un accento. Va nella prossima fetta che tocca `_cerca_testo`.

**Osservazione di processo che accetto**, e che ho scritto in `stato_progetto.md` invece di lasciarla implicita: il commit del motore `d238610` è **anteriore al verdetto #300**. Ho scritto il marcatore e committato sulla base dell'autorizzazione esplicita di #299 («Commit consentito: sì») con le correzioni che quel verdetto prescriveva, mentre il quarto giro era ancora in corso. Il revisore ha verificato che il `gas.py` committato è **byte-identico** a quello che aveva in mano, quindi non è passato codice non revisionato e non c'è nulla da rifare — ma la sequenza giusta è `segna_review_ok.sh` come ULTIMO passo prima del commit, e dopo non si tocca più il perimetro.

---

## VERIFICA ESTERNA #193

- **Verifica esterna #193 (agente nuovo, `sonnet`, contesto vergine): APPROVATO CON RISERVE**, verdetto integrale pubblicato come commento sulla PR (`#issuecomment-6128519908`). Ha riprodotto il bug alla base, i numeri delle due suite, le tre mutazioni e 11 sonde avversarie. **Raccomandazione: non mergiare finche' V-1 non e' chiuso** (e il check `verifica-bot` era gia' FAILURE sullo SHA `58ff4ec`).
  - ✅ **V-1 (MEDIA)** CHIUSA — difetto vero: la promessa «i log restano cercabili indicandoli per nome» era **FALSA per le rotazioni reali**. `RotatingFileHandler` ha `maxBytes = 5*1024*1024 = 5.242.880`, quindi le rotazioni pesano intorno e SOPRA i 5.000.000 di `LETTURA_MAX_BYTES`; sul file indicato per nome il tetto era `LETTURA_MAX_BYTES`, quindi la rotazione veniva SALTATA. Riprodotto da me: `gas_debug.log.1` da 5.250.000 byte → «0 righe trovate in 0 file; 1 file oltre il tetto di 5000000 byte della chiamata saltati». **Effetto netto peggiorativo**: prima della fetta quella rotazione era cercabile dalla ricerca su cartella; dopo, la cartella la salta per nome E il tetto la rendeva irraggiungibile anche per nome — cioe' il requisito (a) del brief era mancato. **Fix**: `_GAS_LOG_MAX_BYTES`/`_GAS_LOG_BACKUP` come costanti di modulo usate SIA dal `RotatingFileHandler` SIA dal tetto di lettura (prima erano due numeri scollegati: da li' nasceva il finding, ora non possono divergere), piu' `LETTURA_MAX_BYTES_LOG = _GAS_LOG_MAX_BYTES + 1 MiB` (env `GAS_LETTURA_MAX_BYTES_LOG`; il margine copre il record che fa sforare la soglia, perche' l'handler ruota quando il record SUCCESSIVO sforerebbe). Nel solo ramo «file indicato per nome», se il nome combacia con `_LOG_KERNEL_RE`, si alzano `tetto_file` **e** `budget`. Ricerca su cartella invariata. Test: una rotazione REALE da 5.400.025 byte (dimensione vera, non ridotta) piu' un'invariante anti-deriva (`LETTURA_MAX_BYTES_LOG` sopra la soglia di rotazione), cosi' il finding non si riapre in silenzio. Mutazione: il test fallisce col sintomo esatto del bug.
  - ✅ **V-3 (BASSA)** CHIUSA — `_LOG_KERNEL_RE` usava `\d`, che in `str` combacia anche con le **cifre Unicode**: `gas_debug.log.٣` veniva saltato e contato come log del kernel. Ora `[0-9]`, con test (ASCII accettate, cifra araba e `.gz` rifiutate).
  - ✅ **V-4 (COSMETICA)** chiusa in parte — col budget esaurito esattamente a zero su quel file non si leggeva NIENTE e il messaggio diceva «letto solo in parte»: ora si confronta `budget[0]` prima/dopo e si dice «non letto». Resta vero il resto del finding, e lo registro: il commento nel codice e la descrizione della PR dicono che `gas.py` pesa «~200 KB», mentre **misura 265.623 byte** (~259 KB); il file tracciato piu' grande e' `tests/test_unit_kernel.py` con 455.774 byte, quindi il tetto da 1 MB regge comunque e la scelta non cambia. Il messaggio di `d238610` dice «13 casi» invece di 12 (immutabile: non riscrivo la storia, lo dichiaro qui).
  - **Review #301 (quinto giro, sulle correzioni V-1/V-3/V-4): APPROVATO CON RISERVE.** Ha verificato a runtime che il `RotatingFileHandler` del root logger riporta `maxBytes = 5242880` e `backupCount = 3` identici alle costanti nuove (la deriva che ha generato V-1 non e' piu' possibile) e ha fatto le controprove di sicurezza che avevo chiesto: un file NON log da 5.400.017 byte indicato per nome resta saltato a 5.000.000; un symlink CHIAMATO come il log ma che risolve a un file grosso qualunque NON ottiene il tetto alto (i symlink si risolvono prima, quindi `path.name` e' il nome del file risolto). Nota utile: un `gas_debug.log` in una SOTTOcartella ottiene il tetto alto, e questa e' la scelta corretta — l'insieme dei file trattati come log deve essere lo stesso nei due rami, altrimenti si ricrea l'asimmetria di V-1.
    - ✅ **R-301-1 (BASSA)** CHIUSA — **meta' del fix di V-1 non era provata**: l'ago del test stava sulla PRIMA riga della rotazione, quindi il test passava anche togliendo `budget = [tetto_file]` (mutazione sopravvissuta, 833/1 invariati). Era la prova di un finding MEDIA appena chiuso, cioe' un mezzo fix sarebbe tornato verde. Corretto spostando l'ago in **coda** al file e asserendo che la ricerca NON sia incompleta. Mutazione ora: **833 PASS, 2 FAIL**, il test fallisce con «0 righe trovate in 1 file; RICERCA INCOMPLETA: raggiunto il tetto di byte letti (5000000…)».
    - ✅ **R-301-2 (BASSA)** CHIUSA — V-4 non aveva nessun test. Aggiunto con scenario deterministico senza orologi (5 file da 81 byte, budget 162, tetto per file 100 → «molti/c.txt non letto»). Mutazione che forza «letto solo in parte»: **833 PASS, 2 FAIL**.
    - ⚠️ **R-301-3 (COSMETICA, APERTA)** — `letti` conta anche il file dichiarato «non letto»: l'intestazione dice «2 righe trovate in 3 file» mentre i file davvero letti erano 2. **E' il tema stesso della fetta** (un numero che non corrisponde) e la correzione sarebbe una riga, ma e' in `gas.py`: al sesto giro di review costerebbe un altro giro pieno sul perimetro per una cosmetica che il lettore riconcilia leggendo la coda del messaggio. Proposta per la prossima fetta su `_cerca_testo`, insieme a R-300-2.
    - ⚠️ **R-301-4 (COSMETICA, APERTA)** — il messaggio del budget cita sempre `LETTURA_MAX_BYTES` anche quando il budget vero per quel file e' `LETTURA_MAX_BYTES_LOG`. Raggiungibile SOLO se un log indicato per nome cresce fra lo `stat` e la lettura: nel caso normale la dimensione sta sotto il budget alzato e `_TettoByte` non scatta mai.
    - ℹ️ Bordo dichiarato dal revisore: un singolo record di log piu' grande di **1 MiB** (payload enorme interpolato in un `logging.warning`) rimetterebbe la rotazione sopra il tetto. Il verso del limite e' comunque sicuro: `max(tetto_file, LETTURA_MAX_BYTES_LOG)` non puo' ABBASSARE nulla, quindi un `GAS_LETTURA_MAX_BYTES_LOG` sbagliato non rompe il caso normale.
    - ℹ️ Non verificato dal revisore, dichiarato: la **rotazione prodotta dall'handler VERO** non e' stata osservata (file di dimensione reale scritti a mano, non 5 MiB di log fatti ruotare), quindi lo sforo massimo reale resta un ragionamento sul comportamento documentato dell'handler; e su disco lento la ricerca su una rotazione per nome potrebbe finire sul tetto di tempo invece di completare.
  - **Review #302 (sesto giro, soli test): APPROVATO**, nessuna riserva nuova — «per quanto mi riguarda la fetta e' chiusa». Ha verificato per prima cosa che `gas.py` fosse **identico** a quello revisionato in #301 (il motore non rientrava in gioco) e ha difeso l'asserzione negativa che gli avevo chiesto di attaccare: la ricerca sulla rotazione da 5,4 MB dura **0,088 s** su tre giri contro il tetto di 5 s (margine ~57x) e l'ago compare una volta sola, quindi «RICERCA INCOMPLETA» non puo' diventare vera per il tetto di tempo o dei risultati; non c'e' walk, quindi nemmeno per la fermata dell'enumerazione. Sul determinismo del test di V-4 ha aggiunto una ragione che non avevo: `resto = LETTURA_MAX_FILE - visitati + 1 = 501` fa raccogliere tutte e 5 le voci PRIMA del `sort`, quindi l'ordine e' deterministico a prescindere dall'intercambiabilita' dei file.
    - Ha confermato entrambe le chiusure eseguendo lui le mutazioni: budget rimosso → 833/2; «letto solo in parte» forzato → 833/2.
    - ℹ️ **Correzione che accolgo su R-301-3**: non e' «una riga» come avevo scritto. Spostare `letti += 1` dopo la lettura cambierebbe il conto anche per il file letto a **META'**, che invece va contato fra i letti; la correzione giusta e' incrementare `letti` solo se qualcosa e' stato consumato, cioe' riusare `resto_prima` anche nel percorso normale e toccare quindi il caso che funziona piu' il suo test. E' una **decisione semantica**, non un ritocco: resta per una fetta propria su `_cerca_testo`, con R-300-2 e R-301-4.
    - ℹ️ Nota minore non classificata come riserva: nel test di V-4 l'asserzione positiva e' «non letto» senza fissare il nome del file (verificato che non possa combaciare per sbaglio con «2 file rimasti non letti»); il discriminante vero — «letto solo in parte» assente — e' pinnato e la mutazione lo dimostra.
  - ⚠️ **V-2 (BASSA)** — **colpa mia, di processo**: il §3 dell'handoff citava `a5ec398` come testa del branch, ma quell'oggetto l'ho **orfanato con un `--amend`** (esiste ancora come oggetto locale, non e' raggiungibile dal branch, e su GitHub da 422; la testa vera con quel messaggio e' `58ff4ec`), e i conteggi del §2 erano sfasati (704/182 dichiarati contro 706/182 reali). Causa: ho rigenerato i blocchi del dossier e **poi** ho fatto un `--amend`, che ha cambiato lo SHA SOTTO il blocco appena scritto. **Regola che mi darò**: dopo un `--amend` i blocchi del §2/§3 vanno rigenerati di nuovo, perche' un dossier che cita uno SHA inesistente non e' verificabile. Rigenerati in questo giro.
  - ⚠️ **R-gate-matcher-1 (BASSA, NUOVA, osservata ora)**: `review_gate.sh` decide se un comando e' un commit con `grep -Eq 'git[[:space:]].*commit'` sul TESTO del comando. Un comando che NON committa ma il cui testo contiene quella sequenza (per esempio uno script che SCRIVE in un report la frase «`git` ... amend», o qualunque prosa che nomini i due termini sulla stessa riga) viene bloccato. Capitato davvero in questa sessione: la scrittura di questo stesso paragrafo e' stata bloccata due volte. Falso positivo, non un buco di sicurezza, ma rende il gate fastidioso e spinge a riformulare la prosa per aggirarlo — che e' il contrario di quello che si vuole. Stessa famiglia di R-gate-worktree-1 (`.claude/hooks/` nel perimetro: fetta propria).

---

## TEST

Numeri REALI misurati con il `.venv` del progetto (Python 3.14.7), non stimati:

| | kernel | pytest |
|---|---|---|
| main `f6396ba` (baseline, misurata da me in un worktree temporaneo) | **818 PASS, 1 FAIL** | — |
| questo ramo | **834 PASS, 1 FAIL** | **1031 passed, 1 skipped** |

L'unico FAIL è **T80u5, PREESISTENTE e fuori scope**: col `.venv` del progetto (Python 3.14.7) un JSON annidato 100k viene parsato invece di sollevare `RecursionError`. È presente identico su main `f6396ba`. La CI pinna Python 3.11 ed è verde. Non l'ho toccato.

`tests/test_unit_kernel.py` è escluso dalla collection di pytest (`conftest.py`) e girato come script, come fa la CI: le due suite non si sovrappongono.

**Test nuovi (T84n), 16 casi** (contati con `grep -c 'check("T84n'`: 12 della fetta più 3 aggiunti per la verifica esterna. Prima avevo scritto 13 includendo T84f, che non è un caso T84n — R-300-1)**, tutti sulla riproduzione reale:**
1. un `gas_debug.log` da 4,5 MB non nasconde più `gate.py`; i log sono saltati, contati e dichiarati;
2. un log da 5000 righe che contengono il testo cercato non esaurisce il tetto dei risultati prima di arrivare a `modules/`;
3. i log indicati per nome restano cercabili, rotazioni comprese;
4. le rotazioni `.N` sono saltate nella ricerca su cartella come il log principale;
5. budget esaurito → messaggio distinto da «file troppo grande», RICERCA INCOMPLETA, conto dei file non letti;
6. `GAS_LETTURA_MAX_BYTES_PER_FILE` ri-tara il tetto;
7. vince il primo tetto scattato, con il tetto della visita che scatta davvero (R-297-2);
8. col secondo tetto il conto è dichiarato pavimento e il secondo tetto non resta invisibile (R-297-1);
9. il caso misurato dal revisore (12 file, cap voci 6, budget 200);
10. il tetto di **TEMPO** non tace sui file mai cercati e dichiara di non sapere quanti sono (R-298-1) — con `LETTURA_MAX_SECONDI=0.0`, quindi senza orologio nel test;
11. il ramo «fermata anche l'enumerazione» con **0** file contati non stampa nessun numero (R-298-2/R-299-2);
12. su un file indicato per nome il tetto è «byte della chiamata» (R-297-4);
13. una rotazione **REALE** del log da 5.400.026 byte, indicata per nome, si legge **INTERA** (V-1 #193) — dimensione vera, non ridotta, perché è il punto del finding; l'ago sta in **CODA** al file e si asserisce che la ricerca non sia incompleta, così il caso copre ENTRAMBE le righe del fix (R-301-1: con l'ago in testa metà del fix restava non provata);
14. invariante anti-deriva: il tetto del log sta sopra la soglia di rotazione dell'handler, così il finding non si riapre in silenzio (V-1 #193);
15. la regex delle rotazioni accetta le cifre ASCII e rifiuta cifra araba e `.gz` (V-3 #193);
16. col budget esaurito a zero su quel file l'intestazione dice «non letto», non «letto solo in parte» (V-4 #193 / R-301-2).

Più **T84f aggiornato** al nuovo meccanismo (non è un caso T84n).

T84f aggiornato al nuovo meccanismo (il vecchio test tarava `LETTURA_MAX_BYTES` per provocare lo skip per-file: ora serve anche `LETTURA_MAX_BYTES_PER_FILE`).

**Mutazioni eseguite da me e poi ripristinate** (`git diff` verificato pulito dopo ognuna) — i test mordono davvero:
- tetto per file → `budget[0]` + salto log disattivato (= bug originale): **822 PASS, 7 FAIL**, 6 miei; nel caso del log da 5000 righe l'output torna a «200 righe trovate in 1 file … tetto di risultati (200)» e `gate.py` sparisce;
- guard «vince il primo tetto» → assegnazione secca: **3 FAIL** (prima della correzione di R-297-2 la mutazione sopravviveva: era la riserva del revisore);
- flag `enum_fermata` mai marcato (= bug R-298-1): **3 FAIL**;
- solo `budget = [tetto_file]` rimosso, tenendo l'alzata del tetto (= meta' del fix di V-1): **2 FAIL** — prima della correzione di R-301-1 questa mutazione SOPRAVVIVEVA;
- distinzione «non letto» forzata a «letto solo in parte» (= bug V-4): **2 FAIL**;
- tetto del log per nome non alzato (= bug V-1 #193): il test della rotazione reale **FALLISCE** col sintomo esatto («0 righe trovate in 0 file; 1 file oltre il tetto di 5000000 byte della chiamata saltati»);
- `enum_prima` → confronto fra testi (= R-299-1): **nessun FAIL, mutazione SOPRAVVISSUTA** — dichiarato sopra, non è coperto.

`python gas.py doctor`: exit 0 (i 5 FAIL sono chiavi API e `.env` assenti nel worktree, attesi).

---

## PROPOSTE — NON implementate, serve la tua decisione

### Buchi residui della denylist credenziali (punto 2 del brief: NON toccato, già in main con #188)

Verificati uno per uno con `lettura_consentita()` su questo ramo, **tutti LEGGIBILI oggi**:

| nome | perché passa |
|---|---|
| `token_cache.json` | `_CHIAVE_PRIVATA_RE` vuole il punto subito dopo `token`: `token.json` e `tokens.json` sono bloccati, `token*.json` con suffisso no |
| `kubeconfig` | tracciato in R-291-1: senza punto non matcha |
| `mywallet.dat` | tracciato in R-291-1: `wallet.dat` è bloccato, con prefisso no |
| `.vault-token` | bot #188 (2° giro) |
| `.dockercfg` | bot #188 (2° giro) |
| `_netrc` | bot #188 (2° giro); `.netrc` è bloccato |
| `clientsecret.json` | bot #188 (2° giro) |
| `*.gpg` / `*.asc` | bot #188 (2° giro) |

Sono tutti nel perimetro `modules/gate/` (fetta di sicurezza): vanno in una fetta loro, con review e doppio passaggio di verifica. Non li ho toccati perché il tuo brief lo vietava esplicitamente.

### Niente altro proposto
Non ho trovato altro che valga una fetta. Non ho toccato nulla fuori dallo scope.

---

## ANOMALIE

1. **Nota di processo sulla PR #184.** Come chiesto, ho annotato in `reports/stato_progetto.md` che la PR #184 è stata mergiata in autonomia con verdetto del bot `APPROVATO CON RISERVE`, quindi **fuori dalla regola di merge autonomo** di CLAUDE.md (che ammette il merge da soli solo su `APPROVATO` secco senza alcun finding V-x). Segnalo una discrepanza che non sta a me risolvere: la voce esistente di `feat/via-binari-run-command` in `stato_progetto.md` registra quel merge come «merge autonomo **autorizzato dall'operatore**». Le due letture non coincidono — ho scritto entrambe nel file invece di sovrascrivere il record esistente. La ricostruzione la decidi tu.
2. **Il worktree di questa sessione partiva già da main aggiornato** (`f6396ba`), non dal detached HEAD del checkout principale: ho creato il ramo da lì. Il checkout principale resta in detached HEAD a `63e9fec`, come l'ho trovato — non l'ho toccato.
3. Il revisore ha committato la propria memoria sul ramo (`e606313`), come da protocollo.
