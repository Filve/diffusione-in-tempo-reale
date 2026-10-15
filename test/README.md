# Test di robustezza e sicurezza (fork)

Script locali di questo fork per verificare che il motore fallisca in modo
pulito con input ostili, senza crash né errori di memoria. Istruzioni complete
in italiano: [docs/integrazione_progetti.md](../docs/integrazione_progetti.md),
sezione "Sicurezza".

| Test | Cosa verifica | Come si esegue |
|---|---|---|
| `security_smoke.sh` | file modello ostili + opzioni CLI estreme → mai crash (exit < 128) | `./test/security_smoke.sh build/bin/sd-cli` |
| `api_robustness.cpp` | API C: puntatori nulli, indici fuori range, buffer piccoli, stress multi-thread (con ASan/UBSan) | vedi intestazione del file |
| `pe_imports_test.cpp` | lettore della tabella di importazione dei file PE (diagnostica delle DLL mancanti su Windows): file validi, troncati e corrotti (con ASan/UBSan) | vedi intestazione del file |
| `file_handle_pool_test.cpp` | pool dei flussi aperti sui file modello: riuso, file modificato o sostituito, flussi in errore, limiti, uso concorrente (con ASan/UBSan e TSan) | vedi intestazione del file |
| `model_loader_latency_test.cpp` | attesa alla fine di `ModelLoader::load_tensors`: un caricamento di pochi tensori già pronti torna in meno di 100 ms (prima aspettava un intero intervallo di 200 ms a ogni caricamento, e i pesi in streaming ne fanno decine per ogni passo), dati letti esatti, errore di un tensore segnalato subito. Scrive da solo un piccolo file safetensors: serve la libreria compilata, nessuna GPU né modello | vedi intestazione del file |
| `profile_test.cpp` | profili di risorse (`--profile`): scelta automatica da dimensione del modello e memoria (anche sommando la memoria di più GPU), ordine dei livelli, opzioni esplicite che vincono sul profilo | vedi intestazione del file |
| `backend_fit_plan_test.cpp` | pianificatore multi-GPU dell'auto-fit (`--multi-gpu auto\|on\|off`) con GPU simulate: quale modulo va su quale GPU, quando il modello si divide per blocchi, nessun device riceve più pesi del suo budget, i moduli assegnati dall'utente non si muovono. Con più backend installati insieme (CUDA e Vulkan): la stessa scheda vista da due backend conta una volta sola, una GPU integrata non diventa la scheda principale finché una scheda ha memoria libera e la sua memoria condivisa (la RAM) non ospita pesi (include `src/core/backend_fit.cpp`, quindi serve la libreria compilata; nessuna GPU né modello) | vedi intestazione del file |
| `server_recovery_test.cpp` | custode del contesto del server (`examples/server/recovery.*`): scala dei profili, discesa su memoria insufficiente, risalita dopo una pausa, ricarica dopo un errore, risposte HTTP 503/400/500 con `Retry-After`, uso da più thread. Annullamento di una generazione in corso: lo stop raggiunge solo il job che lo ha chiesto, un job annullato prima di partire non genera nulla, non costa nessuna ricarica del modello e non conta come errore. Non serve nessun modello: libreria e orologio sono simulati (con ASan/UBSan e TSan) | vedi intestazione del file |
| `server_cancel_e2e.py` | annullamento di un job in corso su un vero `sd-server` (serve un modello qualsiasi, su qualunque backend): job fermato, richiesta ripetuta, job in coda, `?wait=0`, POST senza corpo né `Content-Length` (come `curl -X POST`: risposta subito, non dopo 5 secondi), richiesta sincrona in attesa che poi completa, job già finito, id sconosciuto, `wait` non valido, contatori di `/sdcpp/v1/health` e log senza righe di errore | `python3 test/server_cancel_e2e.py --server build/bin/sd-server --model <modello>` |
| `termico_test.py` | programma di diagnostica termica [`scripts/diagnostica_termica/`](../scripts/diagnostica_termica/README.md) (`termico.py` e `carico_motore.py`) con una GPU finta (un `nvidia-smi` scritto dentro il test) e un motore finto: lettura dei campi e dei motivi di throttling, fasce di temperatura, giudizi, riepilogo e file di stato, confronto fra prove, codici di uscita, interruzione con Ctrl+C e SIGTERM, motore che non risponde, chiave API. Non serve nessuna GPU, driver o modello | `python3 test/termico_test.py` (1-2 minuti; `--veloce` salta le prove che lanciano il programma) |
| `agenti_guardiano_test.py` | guardiano d'esempio di [docs/agenti_indipendenti.md](../docs/agenti_indipendenti.md) (sezione 9): il test estrae il codice dalla guida e lo fa girare. Senza opzioni usa un orologio e un motore finti (nessun modello né GPU): lettura dello stato e dato vecchio, livelli, attesa prima di ripartire, tetto orario, file `stop`, registro, `429`/`503` con `Retry-After`, scadenze, stop ignorato dal motore. Con `--server` e `--model` prova la catena vera: `sd-server` (anche su CPU), `termico.py` con la GPU finta di `termico_test.py`, GPU critica = job fermato con `cancel` senza discesa di profilo, job di un altro programma non toccato | `python3 test/agenti_guardiano_test.py` (10 secondi); con il server vero aggiungi `--server build/bin/sd-server --model MODELLO` (circa 2 minuti con un modello piccolo) |
| `fuzz_model_loader.py` | fuzzing a mutazione del caricamento modelli (safetensors/GGUF) | `python3 test/fuzz_model_loader.py <sd-cli> --seconds 300` |

Per il fuzzing è consigliata una build con AddressSanitizer:

```shell
cmake -B build_asan -DCMAKE_BUILD_TYPE=RelWithDebInfo -DSD_WEBP=OFF -DSD_WEBM=OFF \
      -DCMAKE_C_FLAGS=-fsanitize=address -DCMAKE_CXX_FLAGS=-fsanitize=address \
      -DCMAKE_EXE_LINKER_FLAGS=-fsanitize=address
cmake --build build_asan -j --target sd-cli
python3 test/fuzz_model_loader.py build_asan/bin/sd-cli --seconds 600
```

Gli input che causano una scoperta vengono salvati in `test/fuzz_findings/`
(da non committare). Questi test riducono il rischio ma non dimostrano
l'assenza di vulnerabilità.
