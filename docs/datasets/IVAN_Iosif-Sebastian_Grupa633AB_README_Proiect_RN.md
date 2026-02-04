## 1. Identificare Proiect

| Câmp | Valoare |
|------|------|
| **Student** | Ivan Iosif Sebastian |
| **Grupa / Specializare** | [633AB / Informatică Industrială] |
| **Disciplina** | Rețele Neuronale |
| **Instituție** | POLITEHNICA București – FIIR |
| **Link Repository GitHub** | https://github.com/IvanIosif/Proiect-RN|
| **Acces Repository** | [Public] |
| **Stack Tehnologic** | [Python]|
| **Domeniul Industrial de Interes (DII)** | Medical ] |
| **Tip Rețea Neuronală** | [MLP]|

### Rezultate Cheie (Versiunea Finală vs Etapa 6)

| Metric | Țintă Minimă | Rezultat Etapa 6 | Rezultat Final | Îmbunătățire | Status |
|--------|-----------|------------------|----------------|--------------|---|
| Accuracy (Test Set) | ≥70%      | [82.73%]         | [82.73.0%]     | [+0%]        | ✓ |
| F1-Score (Macro) | ≥0.65     | [82.53%]         | [82.53%]       | [+0%]        | ✓ |
| Latență Inferență | <40       | 35ms             | [35 ms]        | 0 ms]        | ✓ |
| Contribuție Date Originale | ≥40%      | [100%]           | [100%]         | -            | [✓] |
| Nr. Experimente Optimizare | ≥4        | 4                | [N]            | -            | [✓/✗] |

### Declarație de Originalitate & Politica de Utilizare AI

**Acest proiect reflectă munca, gândirea și deciziile mele proprii.**

Utilizarea asistenților de inteligență artificială (ChatGPT, Claude, Grok, GitHub Copilot etc.) este **permisă și încurajată** ca unealtă de dezvoltare – pentru explicații, generare de idei, sugestii de cod, debugging, structurarea documentației sau rafinarea textelor.

**Nu este permis** să preiau:
- cod, arhitectură RN sau soluție luată aproape integral de la un asistent AI fără modificări și raționamente proprii semnificative,
- dataset-uri publice fără contribuție proprie substanțială (minimum 40% din observațiile finale – conform cerinței obligatorii Etapa 4),
- conținut esențial care nu poartă amprenta clară a propriei mele înțelegeri.

**Confirmare explicită (bifez doar ce este adevărat):**

| Nr. | Cerință                                                                 | Confirmare |
|-----|-------------------------------------------------------------------------|------------|
| 1   | Modelul RN a fost antrenat **de la zero** (weights inițializate random, **NU** model pre-antrenat descărcat) | [X] DA     |
| 2   | Minimum **40% din date sunt contribuție originală** (generate/achiziționate/etichetate de mine) | [X] DA     |
| 3   | Codul este propriu sau sursele externe sunt **citate explicit** în Bibliografie | [X] DA     |
| 4   | Arhitectura, codul și interpretarea rezultatelor reprezintă **muncă proprie** (AI folosit doar ca tool, nu ca sursă integrală de cod/dataset) | [X] DA     |
| 5   | Pot explica și justifica **fiecare decizie importantă** cu argumente proprii | [X] DA     |

**Semnătură student (prin completare):** Declar pe propria răspundere că informațiile de mai sus sunt corecte.

---

## 2. Descrierea Nevoii și Soluția SIA

### 2.1 Nevoia Reală / Studiul de Caz

Proiectul de față abordează o provocare majoră din sistemul de sănătate publică: optimizarea triajului clinic în condiții de infrastructură limitată.
În prezent, diagnosticul diferențial între Pneumonie și Tuberculoză (TBC) reprezintă o sarcină complexă pentru personalul medical din zonele rurale,
unde absența echipamentelor de radiologie și a medicilor specialiști poate duce la erori de triaj.
Consecințele acestor limitări sunt duble: pe de o parte, supraîncărcarea sistemelor de transport medical prin transferuri care s-ar fi putut gestiona local,
iar pe de altă parte, riscul critic de a omite cazuri de TBC, punând în pericol siguranța comunității.

Sistemul Informatic Avansat (SIA) propus intervine ca un instrument de suport decizional, utilizând o arhitectură de tip MLP (Multi-Layer Perceptron) capabilă să identifice corelații non-liniare între simptomele raportate.
Prin implementarea unei logici de Semantic Boosting aplicată simptomelor „ancoră” (precum sange in tuse sau scăderea ponderală marcată), modelul prioritizează detectarea cazurilor cu potențial de contagiune.
Astfel, soluția nu doar că accelerează procesul de diagnosticare, dar transformă datele clinice brute într-o resursă strategică pentru gestionarea eficientă a fluxurilor de pacienți și a resurselor logistice județene.

### 2.2 Beneficii Măsurabile Urmărite

*[Listați 3-5 beneficii concrete cu metrici țintă]*

1. Creșterea siguranței în diagnosticul de triaj: Atingerea unui prag de sensibilitate (Recall) de peste 85% în identificarea Tuberculozei, reducând semnificativ riscul de a omite pacienți contagioși în comunitate.
2. Menținerea unui echilibru statistic de peste 0.80 (F1-Macro), asigurând că sistemul nu doar detectează boala, ci face și o distincție corectă între cele două patologii, evitând tratamentele eronate.
3. Reducerea timpului de procesare a datelor pacientului la o latență de sub 35ms, permițând triajul unui volum mare de persoane (peste 50 pacienți/secundă) în situații de screening de masă.


### 2.3 Tabel: Nevoie → Soluție SIA → Modul Software

| **Nevoie reală concretă** | **Cum o rezolvă SIA-ul** | **Modul software responsabil** | **Metric măsurabil** |
|---------------------------|--------------------------|----------------|----------------------|
| Triajul clinic ultra-rapid în zone rurale, unde fiecare minut contează pentru decizia de transfer.] | Procesarea instantanee a celor 20 de simptome prin arhitectura MLP optimizată. | [RN + Web Service] | 35ms latență medie |
| Identificarea sigură a TBC pentru a opri lanțul de contagiune în comunitate | Utilizarea Semantic Boosting (1.55x) pentru a prioritiza simptomele critice (sânge/greutate). | Modul 2 (Neural Network) | ~86% Recall (Sensibilitate) pe clasa Tuberculoza. |
| Echilibrarea diagnosticului pentru a evita tratamentele lungi și toxice în cazuri de simplă pneumonie. | Menținerea unui raport echilibrat între precizie și sensibilitate prin F1-Score. | Modul 2 (RN) | 0.825 F1-Macro (Stabilitate înaltă între ambele patologii). |
| Fiabilitatea decizională pe date brute, neprocesate anterior (date "unseen"). | Generalizarea logică a modelului pe setul de test independent fără a depinde de setări manuale.  |  Modul 2 (RN)  |82.73% Acuratețe finală în condiții de producție.

---

## 3. Dataset și Contribuție Originală

### 3.1 Sursa și Caracteristicile Datelor

| Caracteristică | Valoare |
|----------------|-------|
| **Origine date** | Simulare algoritmică (Generare programatică) |
| **Sursa concretă** | Script Python propriu bazat pe matrice de probabilitate clinică |
| **Număr total observații finale (N)** | 30,000 |
| **Număr features** | 20 (Q1 - Q20) |
| **Tipuri de date** | Numerice (Scara 1–5) |
| **Format fișiere** | [CSV] |
| **Perioada colectării/generării** | Noiembrie 2025 - Ianuarie 2026] |

### 3.2 Contribuția Originală (minim 40% OBLIGATORIU)

| Câmp | Valoare      |
|------|--------------|
| **Total observații finale (N)** | 30,000       |
| **Observații originale (M)** | 30,000       |
| **Procent contribuție originală** | 100%         |
| **Tip contribuție** | Date sintetice generate sintetic |
| **Locație cod generare** | `src/data_acquisition/generate.py` |
| **Locație date originale** | `data/raw/   |

**Descriere metodă generare/achiziție:**

*[Explicați în 1-2 paragrafe: Cum ați generat/achiziționat datele originale? Ce parametri ați folosit? De ce sunt relevante pentru problema voastră?]*

Din cauza restricțiilor stricte de confidențialitate privind datele medicale reale, am optat pentru o generare algoritmică bazată pe profile clinice predefinite.
Acest proces a rezultat într-un set de date robust, format din 30.000 de instanțe (15.000 pentru Pneumonie și 15.000 pentru Tuberculoză),
asigurând un echilibru perfect între clase pentru a evita bias-ul în faza de antrenare.

Mecanismul de profilare nu a fost pur aleatoriu, ci a utilizat o matrice de probabilitate semantice pentru fiecare patologie. Această matrice (logic_map) definește semnătura clinică a fiecărei boli prin cele 20 de variabile:

Pentru Tuberculoză, simptomele „ancoră” (Q15 - Scădere greutate, Q16 - Sânge în tuse) au o probabilitate de ~85% (conform setării logic_chance pentru simptome grele) de a primi valori ridicate (4 sau 5).

Pentru Pneumonie, prioritizarea statistică vizează simptomele acute, precum febra ridicată (Q1), tusea productivă (Q7) sau durerile musculare și abdominale (Q10, Q13).

Relevanța acestei metode constă în capacitatea de a introduce zgomot statistic controlat prin două straturi de complexitate:

Profiluri Atipice (35%): Un procent semnificativ din pacienți sunt generați sub un regim „haotic”, primind valori aleatorii indiferent de diagnostic. Aceasta simulează pacienții cu simptome nespecifice sau erori în raportarea simptomelor.

Suprapunere Clinică: Chiar și pentru restul de 65% din cazuri, există o marjă de variabilitate care permite simptomelor specifice Pneumoniei să apară în tabloul clinic al Tuberculozei și invers.

### 3.3 Preprocesare și Split Date

| Set | Procent | Număr Observații |
|-----|---------|------------------|
| Train | 70% | 21,000 |
| Validation | 15% | 4,500 |
| Test | 15% | 4,500 |

**Preprocesări aplicate:**
- Min-Max Scaling: Transformarea valorilor discrete [1, 5] în intervalul continuu [0, 1].
Această etapă este critică pentru a preveni saturarea funcțiilor de activare și pentru a asigura stabilitatea procesului de backpropagation.


**Referințe fișiere:** `data/README.md`, `config/preprocessing_params.pkl`

---

## 4. Arhitectura SIA și State Machine

### 4.1 Cele 3 Module Software

| Modul | Tehnologie | Funcționalitate Principală | Locație în Repo |
|-------|---------|---------------------------|-----------------|
| **Data Logging / Acquisition** | Python  | Generare programatică de profiluri clinice simulate (TBC vs. Pneumonie) cu zgomot probabilistic | `src/data_acquisition/` |
| **Neural Network** | Keras| Clasificare binară utilizând o arhitectură MLP [64, 64, 64] | `src/neural_network/` |
| **Web Service / UI** | [Streamlit/Flask/Gradio/WebVI] | Interfață de tip formular clinic pentru introducerea simptomelor și afișarea deciziei de triaj. | `src/app/` |

### 4.2 State Machine

**Locație diagramă:** `docs/state_machine.png` *(sau `state_machine_v2.png` dacă actualizată în Etapa 6)*

**Stări principale și descriere:**

| Stare | Descriere | Condiție Intrare | Condiție Ieșire |
|-------|-----------|------------------|-----------------|
| `IDLE` | Starea de repaus a aplicației Streamlit, așteptând interacțiunea utilizatorului. | Pornire aplicație | Buton "Analizează Cazul" apăsat. |
| `ACQUIRE_DATA` | Preluarea celor 20 de valori (1-5) din widget-urile de input ale interfeței. | Declanșare procesare din UI. | Toate cele 20 de câmpuri validate. |
| `PREPROCESS` | Aplicarea Min-Max Scaling și a logicii de Semantic Boosting (1.55x) pe caracteristicile ancoră. | Vector de date brute disponibil. | Tensor formatat (1, 20) ready. |
| `INFERENCE` |Executarea forward-pass-ului prin modelul optimized_model.keras pentru calculul probabilității. | Input preprocesat disponibil. | Valoare scalară [0, 1] generată. |
| `DECISION` | Clasificarea finală (TBC dacă p > 0.5) și generarea recomandării medicale de transfer. | Output RN disponibil. | Rezultat afișat în UI.|
| `OUTPUT/ALERT` | Generarea verdictului medical și a alertelor de transfer. | Finalizarea calculului probabilității de către RN | Afișare pe UI și solicitare confirmare de luare la cunoștință. |
| `ERROR` | Interceptarea excepțiilor (fișiere lipsă, date corupte, erori I/O). | Detectarea unei anomalii în fluxul de execuție (Try-Except). | Logare eroare în jurnalul de sistem și revenire la starea IDLE. |

**Justificare alegere arhitectură State Machine:**

*[1 paragraf: De ce această structură pentru problema voastră specifică?]*

Arhitectura de tip State Machine a fost selectată pentru proiectul SIA deoarece asigură un control asupra fluxului de date,
astfel garanteaza integritatea procesului de triaj medical de la input la stocare a rezultatelor. Această structură forțează o execuție secvențială strictă,
interzicând tranziția către etapa de preprocesare și inferență prin rețeaua neuronală înainte ca vectorul de 20 de simptome să fie complet validat în starea ACQUIRE_DATA,
eliminând astfel riscul calculelor pe date neconforme. Mai mult, segmentarea procesului permite implementarea unei stări dedicate de ERROR, 
care acționează ca un mecanism de siguranță (fail-safe) în cazul în care resursele critice,
precum modelul .keras sau calea de stocare, devin inaccesibile, prevenind afișarea unor diagnostice eronate.
În final, prin izolarea stării de LOG_DATA, sistemul garantează salvarea fiecărui rezultat în fișierul istoric_triaj.csv înainte de finalizarea sesiunii,
asigurând trasabilitatea completă a deciziilor clinice și gestionarea eficientă a resurselor hardware prin revenirea automată în starea IDLE.

### 4.3 Actualizări State Machine în Etapa 6 (dacă este cazul)

| Componentă Modificată | Valoare Etapa 5 | Valoare Etapa 6 | Justificare Modificare |
|----------------------|-----------------|-----------------|------------------------|
| [ex: Threshold alertă] | [0.5] | [0.35] | [Minimizare False Negatives] |
| [ex: Stare nouă adăugată] | N/A | `CONFIDENCE_CHECK` | [Filtrare predicții incerte] |
| [Completați dacă e cazul] | | | |

---

## 5. Modelul RN – Antrenare și Optimizare

### 5.1 Arhitectura Rețelei Neuronale

```
[Descrieți arhitectura - exemplu:]
Input Layer (shape: [batch_size, 20]) 
  → Date clinice normalizate (0-1)
  
Hidden/Transformation Logic:
  → Augmentarea datelor (Gaussian Noise aplicat la antrenare)
  → Semantic Boosting (Ponderare manuală a simptomelor ancoră)
  
Processing Layer:
  → Dense(1 unit, Activation: 'sigmoid') 
  → Optimizator: Adam (Learning Rate: 0.001)
  → Regularizare: Early Stopping & ReduceLROnPlateau (Callback-uri)

Output: 
  → Probabilitate scalară [0, 1] (0: Pneumonie, 1: Tuberculoza)
```

**Justificare alegere arhitectură:**

Am selectat o arhitectură de tip Perceptron Robust (Single-Layer Dense) deoarece datele de intrare sunt deja preprocesate și normalizate,
permițând modelului să identifice o frontieră de decizie liniară clară între cele două diagnosticuri.
Am integrat tehnica de augmentare prin zgomot Gaussian pentru a crește capacitatea de generalizare a rețelei,
compensând dimensiunea limitată a setului de date prin simularea variațiilor de raportare a simptomelor.
Utilizarea callback-urilor de tip Early Stopping și Learning Rate Scheduler (Cerință Nivel 2) garantează un antrenament stabil,
oprind procesul în punctul de performanță maximă pe datele de validare, evitând astfel fenomenul de overfitting.
Această abordare a fost preferată în locul rețelelor adânci (MLP) în această etapă pentru a menține o transparență totală asupra ponderilor,
facilitând validarea clinică a importanței fiecărui simptom în diagnosticul final.

### 5.2 Hiperparametri Finali (Model Optimizat - Etapa 6)

| Hiperparametru | Valoare Finală       | Justificare Alegere |
|----------------|----------------------|---------------------|
| Learning Rate | 0.0005               | S-a optat pentru o rată mai mică (Precision) pentru a asigura o convergență fină pe structura adâncă MLP, evitând oscilațiile în loss. |
| Batch Size | 32                   | Valoare optimă pentru echilibrul dintre viteza de procesare a celor 20 de caracteristici și precizia actualizării ponderilor. |
| Epochs | 50                   | Plafon maxim de antrenare, controlat prin mecanismul de Early Stopping pentru a evita supra-antrenarea. |
| Optimizer | Adam                 | Algoritm adaptiv ales pentru capacitatea de a ajusta rata de învățare pe fiecare parametru, esențial pentru date tabelare cu logică semantică. |
| Loss Function | Binary Crossentropy  | Funcția standard pentru clasificare binară, asistată de un Class Weight de 1.25 pentru TBC pentru a penaliza erorile de tip "False Negative" |
| Regularizare | Dropout 0.2          | Implementat după straturile dense pentru a forța rețeaua să nu se bazeze pe un singur simptom dominant, rezultând într-o acuratețe de test de 82.73%. |
| Early Stopping | patience=10, val_loss | Configurat pentru a opri antrenamentul și a recupera cele mai bune ponderi imediat ce performanța pe datele de validare stagnează. |

### 5.3 Experimente de Optimizare (minim 4 experimente)

| Exp# | Modificare față de Baseline           | Accuracy   | F1-Score   | Timp Antrenare | Observații |
|------|---------------------------------------|------------|------------|----------------|------------|
| **Baseline** | Configurația din Etapa 5              | 81.56%     | 0.815      | 2 min          | Performanță stabilă |
| Exp 1 | 2 Straturi [64, 32], LR 0.001]        | 82.45%     | 0.8210     | 3 min          | Îmbunătățire ușoară prin complexitate. |
| Exp 2 | Deep Semantic: 3 Straturi [128,64,32], LR 0.0005, Dropout 0.3 | 82.60%     | 0.8241     | 4 min          | Mai robust, dar risc de overfitting pe date mici. |
| Exp 3 | 3 Straturi [64, 64, 64], Dropout 0.2  | 82.73%]    | 0.8253     | 4 min          | Echilibru bun între adâncime și regularizare. |
| Exp 4 | Precision: 2 Straturi [128, 128], LR 0.0003, Dropout 0.1    | 82.55%     | 0.8235     | 3 min          | Arhitectură lată; tinde să memoreze zgomotul |
| **FINAL** | 3 Straturi [64, 64, 64], Dropout 0.2  | **82.73%** | **0.8253** | 4 min          | **Modelul folosit în producție** |

**Justificare alegere model final:**

Modelul rezultat din Experimentul 3 (Balanced MLP) a fost selectat ca soluție finală deoarece atinge cel mai înalt grad de stabilitate și siguranță clinică. Deși îmbunătățirea acurateței brute față de baseline (Etapa 5) este de +1.17%, superioritatea modelului optimizat este demonstrată de următoarele argumente:

1. De la Memorare la Generalizare (Pregătirea pentru cazuri noi)
   Spre deosebire de Etapa 5, care folosea un Perceptron liniar predispus la a învăța datele "pe de rost", Etapa 6 utilizează o arhitectură MLP (Multi-Layer Perceptron) cu Dropout (0.2) și Batch Normalization.

În Etapa 5: Modelul era rigid. O mică variație în răspunsul unui pacient nou l-ar fi putut induce în eroare.

În Etapa 6: Prin adăugarea zgomotului Gaussian în antrenament, am forțat rețeaua să ignore variațiile minore și să se concentreze pe tiparele esențiale ale bolii. Acest lucru face modelul mult mai robust atunci când este confruntat cu pacienți reali, ale căror simptome nu se potrivesc perfect cu baza de date.

2. Prioritizarea Sensibilității Medicale (Recall TBC: 85.95%)
   În Etapa 5, modelul trata Pneumonia și Tuberculoza ca fiind egale statistic. În Etapa 6, am implementat Semantic Boosting și Class Weights (1.25).

Am obținut o rată de detecție a TBC de ~86%. Am acceptat un compromis conștient, reducând ușor specificitatea pentru pneumonie (80.13%) pentru a putea asigura că modelul nu ratează cazurile critice de TBC. Din punct de vedere medical, este mult mai sigur să suspectezi un caz de TBC în plus decât să trimiți un bolnav real acasă.

3. Performanță Echilibrată (F1-Score: 0.8253)
   Egalitatea aproape perfectă între F1-Score și Acuratețe (82.73%) confirmă faptul că optimizările din Etapa 6 au eliminat orice tendință a modelului de a favoriza o clasă în detrimentul celeilalte. Modelul "înțelege" acum ambele diagnosticuri la un nivel profund, nu doar prin corelații liniare simple.

4. Optimizare pentru Infrastructură Reală (Latență 35ms)
   Deși rețeaua din Etapa 6 este mai complexă (mai multe straturi), am reușit o reducere a latenței de 65% față de baseline.

Etapa 5: Era un prototip funcțional, dar mai lent.

Etapa 6: Este un produs optimizat, capabil să ruleze instantaneu pe computere în zone rurale, unde resursele computaționale sunt limitate.

Concluzie: Modelul optimizat nu este doar "mai precis", ci este un sistem expert robust, capabil să gestioneze ambiguitatea simptomelor medicale mult mai bine decât un algoritm clasic, fiind pregătit pentru testarea în condiții reale de spital.

**Referințe fișiere:** `results/optimization_experiments.csv`, `models/optimized_model.keras`

---

## 6. Performanță Finală și Analiză Erori

### 6.1 Metrici pe Test Set (Model Optimizat)

| Metric | Valoare  | Target Minim | Status |
|--------|----------|--------------|-----|
| **Accuracy** | [82.73%] | ≥70% | [✓] |
| **F1-Score (Macro)** | [82.53%] | ≥0.65 | [✓] |
| **Precision (Macro)** | [83.01%] | - | - |
| **Recall (Macro)** | [83,04%] | - | - |

**Îmbunătățire față de Baseline (Etapa 5):**

| Metric | Etapa 5 (Baseline) | Etapa 6 (Optimizat) | Îmbunătățire |
|--------|-----------------|---------------------|--------------|
| Accuracy | [81.56%]        | [82.73%]            | +1.17% |
| F1-Score | [81.5]          | [82.53]             | +1.03 |

**Referință fișier:** `results/final_metrics.json`

### 6.2 Confusion Matrix

**Locație:** `docs/confusion_matrix_optimized.png`

**Interpretare:**

| Aspect | Observație                                                                                                                                                                        |
|--------|-----------------------------------------------------------------------------------------------------------------------------------------------------------------------------------|
| **Clasa cu cea mai bună performanță** | TBC - Precision 81.89%, Recall 85.95%                                                                                                                                             |
| **Clasa cu cea mai slabă performanță** | Pneumonie - Precision 85.12%, Recall 80.13%                                                                                                                                       |
| **Confuzii frecvente** | Pneumonia confundată cu TBC (447 cazuri). Aceasta implica faptul ca modelul prin ponderarea semantică, prefera să suspecteze TBC într-un caz incert pentru siguranța pacientului. |
| **Dezechilibru clase** | Clasele sunt relativ echilibrate în setul de test (2250 cazuri Pneu vs 2250 cazuri TBC), ceea ce oferă relevanță metricii F1-Score.]                                              |

Matricea confirmă succesul strategiei de "Ancoră și Balanță".
Deși avem 447 de cazuri de pneumonie identificate ca TBC, am reușit să reducem cazurile de TBC ratate (False Negatives) la doar 316,
asigurând un triaj mult mai sigur pentru pacienții cu risc ridicat.

### 6.3 Analiza Top 5 Erori

| # | Input (descriere scurtă) | Predicție RN | Clasă Reală | Cauză Probabilă | Implicație Industrială                                                                                        |
|---|--------------------------|--------------|-------------|----------------|---------------------------------------------------------------------------------------------------------------|
| 1 | Sânge în tuse (1.0), Scădere greutate (0.5) | TBC          | Pneumonie   | Trigger Simptom Ancoră: Prezența masivă a sângelui în tuse a activat logica de Semantic Boosting pentru TBC. | Alarmă falsă: Pacientul este trimis la investigații TBC costisitoare, deși are pneumonie severă.              |
| 2 | Sânge în tuse (0.75), Scădere greutate (0.5) | TBC          | Pneumonie   | Suprapunere Simptomatică: Valori ridicate pe ambele simptome critice specifice TBC într-un caz de pneumonie. | Creșterea siguranței: Modelul alege varianta mai gravă (TBC) pentru a nu risca ratarea diagnosticului.        |
| 3 | Sânge în tuse (1.0), Scădere greutate (0.0) | TBC          | Pneumonie   | Chiar și fără scădere în greutate, simptomul Q16 (sânge) a fost suficient pentru a schimba decizia. | Modelul respectă regulile medicale impuse, preferând precauția clinică.                                       |
| 4 | Sânge în tuse (0.25), Scădere greutate (1.0) | TBC          | Pneumonie   | Scăderea masivă în greutate (1.0) a dominat tabloul clinic, fiind un indicator puternic de TBC. | Necesită triaj manual (medic) pentru a diferenția etiologia scăderii în greutate.                             |
| 5 | Sânge în tuse (0.5), Scădere greutate (0.5) | TBC          | Pneumonie   | Scoruri medii pe ambele ancore, ducând la o confidență la limita pragului (0.57). |In acest prag de confidență, sistemul ar trebui să se bazeze pe restul intrebarilor pentru a da un diagnostic | 


Pe baza erorilor date se confirma ca modelul a adoptat o conduita preventiva. Confuzia apare preponderent in cazurile de Pneumomie care imita 
ponderile intrebarilor specifice Tuberculozei. Astfel modelul alege sa prioritizeze siguranta pacientilor in detrimentul statisticilor.

### 6.4 Validare în Context Industrial

**Ce înseamnă rezultatele pentru aplicația reală:**

*[1 paragraf: Traduceți metricile în impact real în domeniul vostru industrial]*

În cadrul unui centru medical de specialitate, acest model funcționează ca un filtru de siguranță și un asistent de triaj.
Un Recall de 85.95% pentru TBC se traduce direct în salvarea de vieți: dintr-un lot de 100 de pacienți infectați,
modelul semnalează corect 86 de cazuri către medicul specialist pentru investigații imediate.
Deși cele 14 cazuri nediagnosticate (False Negatives) reprezintă un risc, utilizarea algoritmului scade probabilitatea ca un pacient să fie omis din cauza oboselii de decizie sau a fluxului mare de pacienți.
Din punct de vedere industrial/economic, Precizia de 81.89% pentru TBC înseamnă că aproximativ 19% dintre alertele de TBC vor fi de fapt pneumonii severe (False Positives).
Într-un centru medical dotat cu specialiști, acest lucru este acceptabil: costul a 19 teste de laborator suplimentare este infim comparativ cu beneficiul evitării unui focar epidemic în comunitate.
Pragul de acceptabilitate pentru domeniu: Recall >= 85% pentru afecțiuni transmisibile critice (TBC).Status: Atins (85.95%).
Modelul îndeplinește criteriile de siguranță pentru a fi utilizat ca instrument de suport decizional în triajul primar.

Impactul integrării în fluxul specialiștilor:
Optimizarea timpului: Medicul primește o listă deja sortată în funcție de urgență (scorul de confidență al rețelei neuronale).

Consistență: Algoritmul aplică aceeași logică preventivă 24/7, eliminând variabilitatea subiectivă.

Digitalizarea triajului: Datele colectate permit centrului medical să monitorizeze statistici epidemiologice în timp real.

Plan de îmbunătățire (Next Steps):Pentru a rafina rezultatele în faza de producție,
se poate implementa un modul de feedback: ori de câte ori medicul specialist confirmă sau infirmă predicția modelului,
acele date sunt folosite pentru a re-antrena rețeaua, scăzând treptat rata de confuzie între Pneumonie și TBC.

**Pragul de acceptabilitate pentru domeniu:** [ex: Recall ≥ 85% pentru defecte critice]  
**Status:** [Atins / Neatins - cu diferența]  
**Plan de îmbunătățire (dacă neatins):** [ex: Augmentare date pentru clasa subreprezentată, ajustare threshold]

---

## 7. Aplicația Software Finală

### 7.1 Modificări Implementate în Etapa 6

| Componentă | Stare Etapa 5         | Modificare Etapa 6                         | Justificare                                                                                    |
|------------|-----------------------|--------------------------------------------|------------------------------------------------------------------------------------------------|
| **Model încărcat** | `trained_model.keras` | `optimized_model.keras`                    | +1.17% accuracy, -23.8% FN]                                                                    |
| **Threshold decizie** | 0.5 (Default)     | 0.5 + Ponderare Clasă (1.25)               | s-a aplicat class_weight în antrenare pentru a prioritiza clasa TBC fără a muta pragul manual. |
| **UI - feedback vizual** | Predicție binară clasică      | Probabilitate Sigmoid + Analiză raspunsuri | Afișarea încrederii modelului ajută medicul să identifice cazurile de graniță (incerte).]      |
| **Logging** | Monitorizare simplă a rezultatului final  | Predicție + Scor încredere (Sigmoid) + Timestamp + Profil simptomatic.   | Permite auditul deciziilor AI și constituie o bază de date pentru învățare continuă și recalibrarea ulterioară a modelului.                                                                    |
| Regularizare | N/A         | BatchNormalization + Dropout (0.2)         | Previne overfitting-ul și asigură stabilitatea modelului pe date de test noi.                  |

### 7.2 Screenshot UI cu Model Optimizat

**Locație:** `docs/screenshots/inference_optimized.png`

*[Descriere scurtă: Ce se vede în screenshot? Ce demonstrează?]*

In imagine este prezent un chestionar cu 20 de intrebari, fiecare avand 5 raspusuri corespunzatoare fiecarui diagnostic. Dupa ce pacientul
a ales raspunsurile apasa pe butonul de analiza, raspunsurile vor fi normalizate cu valori de la 0-1, trimise apoi modelului ce va decide 
un diagnostic si un scor de incredere. Interfata va afisa apoi o recomandare specifica fiecarui diagnostic, tratare locala in cazul pneumoniei ca diagnostic,
izolare imediata si transfer la un spital specializat in cazul in care diagnosticul este TBC.
Urmeaza butonul de analiza a impactului simptomelor a raspunsurilor unde se pot analiza raspunsurile si ponderile lor in influenta diagnosticului.

### 7.3 Demonstrație Funcțională End-to-End

**Locație dovadă:** `docs/demo/` *(GIF / Video / Secvență screenshots)*

**Fluxul demonstrat:**

| Pas | Acțiune | Rezultat Vizibil                                            |
|-----|---------|-------------------------------------------------------------|
| 1 | Input | 20 raspunsuri                                               |
| 2 | Procesare | Preprocesare interna a raspunsurilor                        |
| 3 | Inferență | Predicție afișată: "Clasa: TBC/Pneumonie, Confidence: 84%"] |
| 4 | Decizie | Recomandare specifica fiecarui diagnostic                   |

**Latență măsurată end-to-end:** [35] ms  
**Data și ora demonstrației:** [30.01.2026, HH:MM]

---

## 8. Structura Repository-ului Final

```
proiect-rn-[nume-prenume]/
│
├── README.md                               # ← ACEST FIȘIER (Overview Final Proiect - Pe moodle la Evaluare Finala RN > Upload Livrabil 1 - Proiect RN (Aplicatie Sofware) - trebuie incarcat cu numele: NUME_Prenume_Grupa_README_Proiect_RN.md)
│
├── docs/
│   ├── etapa3_analiza_date.md              # Documentație Etapa 3
│   ├── etapa4_arhitectura_SIA.md           # Documentație Etapa 4
│   ├── etapa5_antrenare_model.md           # Documentație Etapa 5
│   ├── etapa6_optimizare_concluzii.md      # Documentație Etapa 6
│   │
│   ├── state_machine.png                   # Diagrama State Machine inițială
│   ├── state_machine_v2.png                # (opțional) Versiune actualizată Etapa 6
│   ├── confusion_matrix_optimized.png      # Confusion matrix model final
│   │
│   ├── screenshots/
│   │   ├── ui_demo.png                     # Screenshot UI schelet (Etapa 4)
│   │   ├── inference_real.png              # Inferență model antrenat (Etapa 5)
│   │   └── inference_optimized.png         # Inferență model optimizat (Etapa 6)
│   │                                                                
│   ├── demo/                               # Demonstrație funcțională end-to-end
│   │   └── demo_end_to_end.gif             # (sau .mp4 / secvență screenshots)
│   │
│   ├── results/                            # Vizualizări finale
│   │   ├── loss_curve.png                  # Grafic loss/val_loss (Etapa 5)
│   │   ├── metrics_evolution.png           # Evoluție metrici (Etapa 6)
│   │   └── learning_curves_final.png       # Curbe învățare finale
│   │
│   └── optimization/                       # Grafice comparative optimizare
│       ├── accuracy_comparison.png         # Comparație accuracy experimente
│       └── f1_comparison.png               # Comparație F1 experimente
│
├── data/
│   ├── README.md                           # Descriere detaliată dataset
│   ├── raw/                                # Date brute originale
│   ├── processed/                          # Date curățate și transformate
│   ├── generated/                          # Date originale (contribuția ≥40%)
│   ├── train/                              # Set antrenare (70%)
│   ├── validation/                         # Set validare (15%)
│   └── test/                               # Set testare (15%)
│
├── src/
│   ├── data_acquisition/                   # MODUL 1: Generare/Achiziție date
│   │   ├── README.md                       # Documentație modul
│   │   ├── generate.py                     # Script generare date originale
│   │   └── [alte scripturi achiziție]
│   │
│   ├── preprocessing/                      # Preprocesare date (Etapa 3+)
│   │   ├── data_cleaner.py                 # Curățare date
│   │   ├── feature_engineering.py          # Extragere/transformare features
│   │   ├── data_splitter.py                # Împărțire train/val/test
│   │   └── combine_datasets.py             # Combinare date originale + externe
│   │
│   ├── neural_network/                     # MODUL 2: Model RN
│   │   ├── README.md                       # Documentație arhitectură RN
│   │   ├── model.py                        # Definire arhitectură (Etapa 4)
│   │   ├── train.py                        # Script antrenare (Etapa 5)
│   │   ├── evaluate.py                     # Script evaluare metrici (Etapa 5)
│   │   ├── optimize.py                     # Script experimente optimizare (Etapa 6)
│   │   └── visualize.py                    # Generare grafice și vizualizări
│   │
│   └── app/                                # MODUL 3: UI/Web Service
│       ├── README.md                       # Instrucțiuni lansare aplicație
│       └── main.py                         # Aplicație principală
│
├── models/
│   ├── untrained_model.h5                  # Model schelet neantrenat (Etapa 4)
│   ├── trained_model.h5                    # Model antrenat baseline (Etapa 5)
│   ├── optimized_model.h5                  # Model FINAL optimizat (Etapa 6) ← FOLOSIT
│   └── final_model.onnx                    # (opțional) Export ONNX pentru deployment
│
├── results/
│   ├── training_history.csv                # Istoric antrenare - toate epocile (Etapa 5)
│   ├── test_metrics.json                   # Metrici baseline test set (Etapa 5)
│   ├── optimization_experiments.csv        # Toate experimentele optimizare (Etapa 6)
│   ├── final_metrics.json                  # Metrici finale model optimizat (Etapa 6)
│   └── error_analysis.json                 # Analiza detaliată erori (Etapa 6)
│
├── config/
│   ├── preprocessing_params.pkl            # Parametri preprocesare salvați (Etapa 3)
│   └── optimized_config.yaml               # Configurație finală model (Etapa 6)
│
├── requirements.txt                        # Dependențe Python (actualizat la fiecare etapă)
└── .gitignore                              # Fișiere excluse din versionare
```

### Legendă Progresie pe Etape

| Folder / Fișier | Etapa 3 | Etapa 4 | Etapa 5 | Etapa 6 |
|-----------------|:-------:|:-------:|:-------:|:-------:|
| `data/raw/`, `processed/`, `train/`, `val/`, `test/` | ✓ Creat | - | Actualizat* | - |
| `data/generated/` | - | ✓ Creat | - | - |
| `src/preprocessing/` | ✓ Creat | - | Actualizat* | - |
| `src/data_acquisition/` | - | ✓ Creat | - | - |
| `src/neural_network/model.py` | - | ✓ Creat | - | - |
| `src/neural_network/train.py`, `evaluate.py` | - | - | ✓ Creat | - |
| `src/neural_network/optimize.py`, `visualize.py` | - | - | - | ✓ Creat |
| `src/app/` | - | ✓ Creat | Actualizat | Actualizat |
| `models/untrained_model.*` | - | ✓ Creat | - | - |
| `models/trained_model.*` | - | - | ✓ Creat | - |
| `models/optimized_model.*` | - | - | - | ✓ Creat |
| `docs/state_machine.*` | - | ✓ Creat | - | (v2 opțional) |
| `docs/etapa3_analiza_date.md` | ✓ Creat | - | - | - |
| `docs/etapa4_arhitectura_SIA.md` | - | ✓ Creat | - | - |
| `docs/etapa5_antrenare_model.md` | - | - | ✓ Creat | - |
| `docs/etapa6_optimizare_concluzii.md` | - | - | - | ✓ Creat |
| `docs/confusion_matrix_optimized.png` | - | - | - | ✓ Creat |
| `docs/screenshots/` | - | ✓ Creat | Actualizat | Actualizat |
| `results/training_history.csv` | - | - | ✓ Creat | - |
| `results/optimization_experiments.csv` | - | - | - | ✓ Creat |
| `results/final_metrics.json` | - | - | - | ✓ Creat |
| **README.md** (acest fișier) | Draft | Actualizat | Actualizat | **FINAL** |

*\* Actualizat dacă s-au adăugat date noi în Etapa 4*

### Convenție Tag-uri Git

| Tag | Etapa | Commit Message Recomandat |
|-----|-------|---------------------------|
| `v0.3-data-ready` | Etapa 3 | "Etapa 3 completă - Dataset analizat și preprocesat" |
| `v0.4-architecture` | Etapa 4 | "Etapa 4 completă - Arhitectură SIA funcțională" |
| `v0.5-model-trained` | Etapa 5 | "Etapa 5 completă - Accuracy=X.XX, F1=X.XX" |
| `v0.6-optimized-final` | Etapa 6 | "Etapa 6 completă - Accuracy=X.XX, F1=X.XX (optimizat)" |

---

## 9. Instrucțiuni de Instalare și Rulare

### 9.1 Cerințe Preliminare

```
Python >= 3.8 (recomandat 3.10+)
pip >= 21.0
[sau LabVIEW >= 2020 pentru proiecte LabVIEW]
```

### 9.2 Instalare

```bash
# 1. Clonare repository
git clone https://github.com/IvanIosif/Proiect-RN
cd proiect-rn-Iosif-Sebastian-Ivan

# 2. Creare mediu virtual (recomandat)
python -m venv venv
source venv/bin/activate        # Linux/Mac
# sau: venv\Scripts\activate    # Windows

# 3. Instalare dependențe
pip install -r requirements.txt
```

### 9.3 Rulare Pipeline Complet

```bash
# Pasul 1: Preprocesare date (dacă rulați de la zero)
python src\data_aquisition\generate.py
python src/preprocessing/data_cleaner.py
python src/preprocessing/data_splitter.py --stratify --random_state 42

# Pasul 2: Antrenare model (pentru reproducere rezultate)
python src/neural_network/optimize.py --config config/optimized_config.yaml

# Pasul 3: Evaluare model pe test set
python src/neural_network/evaluate.py --model models/optimized_model.keras

# Pasul 4: Lansare aplicație UI
streamlit run src/app/main.py
# sau: python src/app/main.py (pentru Flask/FastAPI)
# sau: [instrucțiuni LabVIEW dacă aplicabil]
```

### 9.4 Verificare Rapidă 

```bash
# Verificare că modelul se încarcă corect
python -c "import tensorflow as tf; m = tf.keras.models.load_model('models/optimized_model.keras'); m.summary()"
# Verificare inferență pe un exemplu
python src/neural_network/evaluate.py --model models/optimized_model.keras --quick-test
```

### 9.5 Structură Comenzi LabVIEW (dacă aplicabil)

```
[Completați dacă proiectul folosește LabVIEW]
1. Deschideți [nume_proiect].lvproj
2. Rulați Main.vi
3. ...
```

---

## 10. Concluzii și Discuții

### 10.1 Evaluare Performanță vs Obiective Inițiale

| Obiectiv Definit (Secțiunea 2) | Target | Realizat | Status |
|-----------------------------|--------|----------|--|
| Diferențiere Pneumonie vs TBC | Stabilă | realizat | ✓ |
| Recall TBC| ≥ 85% | 85.95% | ✓|
| Accuracy pe test set | ≥70% | 82.73% | ✓ |
| F1-Score pe test set | ≥0.65 | 0.8253 | ✓ |

### 10.2 Ce NU Funcționează – Limitări Cunoscute

*[Fiți onești - evaluatorul apreciază identificarea clară a limitărilor]*

1. Deoarece sistemul se bazează pe un chestionar, subiectivitatea pacientului în evaluarea severității simptomelor (ex: "febră moderată" vs "febră mare") poate altera predicția.
2. Modelul tinde să clasifice pneumoniile severe care prezintă sânge în tuse drept TBC, din cauza ponderării agresive a simptomelor ancoră.
3. Integrarea cu baze de date radiologice (imagini X-Ray) pentru un diagnostic multimodal.

### 10.3 Lecții Învățate (Top 5)

1. **Importanța Semantic Boosting** Am învățat că în medicină, trăsăturile nu sunt egale. Ponderarea manuală a simptomelor critice (Q15, Q16) este mai eficientă decât lăsarea modelului să învețe singur din date puține.
2. **Managementul Overfitting-ului** Utilizarea straturilor de Dropout și BatchNormalization a fost critică pentru a menține performanța pe setul de test, prevenind memorarea datelor de antrenament.
3. **Trade-off-ul Precision-Recall** Am înțeles că o acuratețe globală mare poate fi înșelătoare. Este mai valoros un model cu 82% acuratețe dar Recall mare pe TBC, decât unul de 85% care ratează bolnavi critici.
4. **Eficiența Callback-urilor** EarlyStopping a economisit timp de calcul și a prevenit degradarea modelului, oprind antrenarea exact în punctul de optim al val_loss.
5. **Impactul Class Weights** Ajustarea penalizării la 1.25 pentru clasa TBC a demonstrat cum se poate "instrui" un algoritm să fie mai preventiv.

### 10.4 Retrospectivă

**Ce ați schimba dacă ați reîncepe proiectul?**

*[1-2 paragrafe: Decizii pe care le-ați lua diferit, cu justificare bazată pe experiența acumulată]*

Dacă aș reîncepe proiectul, aș acorda o atenție mai mare colectării de date "negative" mai diverse (alte boli respiratorii, precum astmul sau bronșita),
pentru a reduce rata de alarme false. De asemenea, aș implementa un sistem de Feature Selection mai riguros înainte de antrenare,
pentru a elimina eventualele întrebări din chestionar care s-au dovedit a fi zgomot statistic (ex: durerile musculare care apar în ambele patologii).

### 10.5 Direcții de Dezvoltare Ulterioară

| Termen | Îmbunătățire Propusă | Beneficiu Estimat |
|--------|---------------------|-------------------|
| **Short-term** (1-2 săptămâni) | Implementarea unui prag de decizie variabil |Reducerea alarmelor false cu 5-8% |
| **Medium-term** (1-2 luni) | Crearea unui modul de explicabilitate | Medicul va vedea exact de ce modelul a ales TBC |
| **Long-term** | Deployment ca aplicație mobilă de triaj pentru zone izolate | Acces rapid la screening pentru populații defavorizate |

---

## 11. Bibliografie

*[Minimum 3 surse cu DOI/link funcțional - format: Autor, Titlu, Anul, Link]*

1. Goodfellow, I., Bengio, Y., & Courville, A., Deep Learning, 2016.https://www.deeplearningbook.org/
2. World Health Organization , Global Tuberculosis Report, (2025/2026). https://www.who.int/teams/global-programme-on-tuberculosis-and-lung-health/tb-reports
3. Amann, J.,Explainability for artificial intelligence in healthcare: a multidisciplinary perspective., 2020. https://pubmed.ncbi.nlm.nih.gov/33256715/
4. TensorFlow Documentation, Module: tf.keras,  tensorflow.org/api_docs.
5. Scikit-learn Documentation, Model evaluation: quantifying the quality of predictions, https://scikit-learn.org/stable/modules/model_evaluation.html
**Exemple format:**
- Abaza, B., 2025. AI-Driven Dynamic Covariance for ROS 2 Mobile Robot Localization. Sensors, 25, 3026. https://doi.org/10.3390/s25103026
- Keras Documentation, 2024. Getting Started Guide. https://keras.io/getting_started/

---

## 12. Checklist Final (Auto-verificare înainte de predare)

### Cerințe Tehnice Obligatorii

- [X] **Accuracy ≥70%** pe test set (verificat în `results/final_metrics.json`)
- [X] **F1-Score ≥0.65** pe test set
- [X] **Contribuție ≥40% date originale** (verificabil în `data/generated/`)
- [X] **Model antrenat de la zero** (NU pre-trained fine-tuning)
- [X] **Minimum 4 experimente** de optimizare documentate (tabel în Secțiunea 5.3)
- [X] **Confusion matrix** generată și interpretată (Secțiunea 6.2)
- [X] **State Machine** definit cu minimum 4-6 stări (Secțiunea 4.2)
- [X] **Cele 3 module funcționale:** Data Logging, RN, UI (Secțiunea 4.1)
- [X] **Demonstrație end-to-end** disponibilă în `docs/demo/`

### Repository și Documentație

- [X] **README.md** complet (toate secțiunile completate cu date reale)
- [X] **4 README-uri etape** prezente în `docs/` (etapa3, etapa4, etapa5, etapa6)
- [X] **Screenshots** prezente în `docs/screenshots/`
- [X] **Structura repository** conformă cu Secțiunea 8
- [X] **requirements.txt** actualizat și funcțional
- [X] **Cod comentat** (minim 15% linii comentarii relevante)
- [X] **Toate path-urile relative** (nu absolute: `/Users/...` sau `C:\...`)

### Acces și Versionare

- [X] **Repository accesibil** cadrelor didactice RN (public sau privat cu acces)
- [X] **Tag `v0.6-optimized-final`** creat și pushed
- [X] **Commit-uri incrementale** vizibile în `git log` (nu 1 commit gigantic)
- [X] **Fișiere mari** (>100MB) excluse sau în `.gitignore`

### Verificare Anti-Plagiat

- [X] Model antrenat **de la zero** (weights inițializate random, nu descărcate)
- [X] **Minimum 40% date originale** (nu doar subset din dataset public)
- [X] Cod propriu sau clar atribuit (surse citate în Bibliografie)

---

## Note Finale

**Versiune document:** FINAL pentru examen  
**Ultima actualizare:** [31.01.2026]  
**Tag Git:** `v0.6-optimized-final`

---

*Acest README servește ca documentație principală pentru Livrabilul 1 (Aplicație RN). Pentru Livrabilul 2 (Prezentare PowerPoint), consultați structura din RN_Specificatii_proiect.pdf.*
