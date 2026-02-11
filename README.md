## 1. Identificare Proiect

| Camp | Valoare |
|------|---------|
| **Student** | CALDARARU Denisa Elena |
| **Grupa / Specializare** | 631AB / Informatica Industriala |
| **Disciplina** | Retele Neuronale |
| **Institutie** | POLITEHNICA Bucuresti – FIIR |
| **Link Repository GitHub** | https://github.com/taquitohh/Proiect-RN-Denisa-Elena-Caldararu |
| **Acces Repository** | Public |
| **Stack Tehnologic** | Python (TensorFlow/Keras, NumPy, Pandas), Flask UI, Blender scripts |
| **Domeniul Industrial de Interes (DII)** | Productie / design industrial mobilier |
| **Tip Retea Neuronala** | MLP (Multilayer Perceptron) |

### Rezultate Cheie (Versiunea Finala vs Etapa 6)

| Metric | Tinta Minima | Rezultat Etapa 6 | Rezultat Final | Imbunatatire | Status |
|--------|--------------|------------------|----------------|--------------|--------|
| Accuracy (Test Set) | >=70% | 99.11% | 99.11% | +0.00% (egal) | ✓ |
| F1-Score (Macro) | >=0.65 | 0.9915 | 0.9915 | +0.0000 (egal) | ✓ |
| Latenta Inferenta | <1s (tinta interna) | 44.8 ms | 44.8 ms | n/a | ✓ |
| Contributie Date Originale | >=40% | 100% | 100% | n/a | ✓ |
| Nr. Experimente Optimizare | >=4 | 4 | 4 | n/a | ✓ |

### Declaratie de Originalitate & Politica de Utilizare AI 

**Acest proiect reflecta munca, gandirea si deciziile mele proprii.**

Utilizarea asistentilor de inteligenta artificiala (ChatGPT, Claude, Grok, GitHub Copilot etc.) este **permisa si incurajata** ca unealta de dezvoltare – pentru explicatii, generare de idei, sugestii de cod, debugging, structurarea documentatiei sau rafinarea textelor.

**Nu este permis** sa preiau:
- cod, arhitectura RN sau solutie luata aproape integral de la un asistent AI fara modificari si rationamente proprii semnificative,
- dataset-uri publice fara contributie proprie substantiala (minimum 40% din observatiile finale – conform cerintei obligatorii Etapa 4),
- continut esential care nu poarta amprenta clara a propriei mele intelegeri .

**Confirmare explicita (bifez doar ce este adevarat):**

| Nr. | Cerinta | Confirmare |
|-----|---------|------------|
| 1 | Modelul RN a fost antrenat **de la zero** (weights initializate random, **NU** model pre-antrenat descarcat) | [x] DA |
| 2 | Minimum **40% din date sunt contributie originala** (generate/achizitionate/etichetate de mine) | [x] DA |
| 3 | Codul este propriu sau sursele externe sunt **citate explicit** in Bibliografie | [x] DA |
| 4 | Arhitectura, codul si interpretarea rezultatelor reprezinta **munca proprie** (AI folosit doar ca tool, nu ca sursa integrala de cod/dataset) | [x] DA |
| 5 | Pot explica si justifica **fiecare decizie importanta** cu argumente proprii | [x] DA |

**Semnatura student (prin completare):** Declar pe propria raspundere ca informatiile de mai sus sunt corecte.

---

## 2. Descrierea Nevoii si Solutia SIA

### 2.1 Nevoia Reala / Studiul de Caz

In proiectul acesta, nevoia industriala este clasificarea rapida a tipului de mobilier
pe baza parametrilor geometrici introdusi de utilizator si generarea automata a unui
model 3D procedural (prin Blender). Contextul este proiectarea asistata a mobilierului
in care tipul de obiect (ex: chair_simple vs bar_chair) trebuie identificat instant
pentru a genera geometria corecta si a accelera validarea vizuala.

### 2.2 Beneficii Masurabile Urmarite

1. Reducerea timpului de decizie asupra tipului de obiect la <1s.
2. Precizie ridicata in clasificare (Accuracy >95% pe test set).
3. Generare automata a scriptului Blender in <2s pentru randare preliminara.
4. Reutilizare pipeline multi-obiect (chair/table/cabinet/fridge/stove) fara modificari de UI.

### 2.3 Tabel: Nevoie -> Solutie SIA -> Modul Software

| **Nevoie reala concreta** | **Cum o rezolva SIA-ul** | **Modul software responsabil** | **Metric masurabil** |
|---------------------------|--------------------------|--------------------------------|----------------------|
| Identificarea rapida a tipului de scaun din parametri geometrici | RN returneaza clasa + probabilitati pentru inputul utilizatorului | RN + Web Service/UI | <1s timp inferenta | 
| Generarea automata a modelului 3D procedural | Script Blender generat in functie de clasa prezisa | Blender scripts + Web Service | <2s timp generare script | 
| Validarea fluxului end-to-end (input -> output) | UI afiseaza rezultat RN + script si feedback la erori | UI + Blender API | Rulare completa fara erori | 

---

## 3. Dataset si Contributie Originala

### 3.1 Sursa si Caracteristicile Datelor

| Caracteristica | Valoare |
|----------------|---------|
| **Origine date** | Simulare / generare programatica |
| **Sursa concreta** | Script Python (date sintetice) |
| **Numar total observatii finale (N)** | 15,000 (chair) |
| **Numar features** | 8 |
| **Tipuri de date** | Numerice (tabular) |
| **Format fisiere** | CSV |
| **Perioada colectarii/generarii** | Octombrie 2025 - Ianuarie 2026 |

### 3.2 Contributia Originala (minim 40% OBLIGATORIU)

| Camp | Valoare |
|------|---------|
| **Total observatii finale (N)** | 15,000 |
| **Observatii originale (M)** | 15,000 |
| **Procent contributie originala** | 100% |
| **Tip contributie** | Date sintetice generate programatic |
| **Locatie cod generare** | `src/data_acquisition/generate_chairs.py` |
| **Locatie date originale** | `data/generated/chairs_dataset.csv` |

**Descriere metoda generare/achizitie:**

Datele au fost generate programatic folosind intervale realiste pentru dimensiuni si
reguli deterministe de etichetare. Generatorul foloseste seed fix pentru
reproductibilitate si impune constrangeri de domeniu (ex: backrest_height = 0 cand
has_backrest = 0). Etichetele sunt atribuite logic in functie de parametrii geometrici,
nu prin etichetare manuala.

### 3.3 Preprocesare si Split Date

| Set | Procent | Numar Observatii |
|-----|---------|------------------|
| Train | 70% | 10,500 |
| Validation | 15% | 2,250 |
| Test | 15% | 2,250 |

**Preprocesari aplicate:**
- Standardizare (StandardScaler) pe toate features
- Validare reguli de consistenta (backrest_height = 0 cand has_backrest = 0)

**Referinte fisiere:** `data/README.md`, `config/chair_scaler.pkl`

---

## 4. Arhitectura SIA si State Machine

### 4.1 Cele 3 Module Software

| Modul | Tehnologie | Functionalitate Principala | Locatie in Repo |
|-------|------------|---------------------------|-----------------|
| **Data Logging / Acquisition** | Python | Generare date sintetice (chair/table/cabinet/fridge/stove) | `src/data_acquisition/` |
| **Neural Network** | TensorFlow/Keras | Clasificare multi-clasa pe date tabulare | `src/neural_network/` |
| **Web Service / UI** | Flask UI | Input parametri, inferenta, afisare script Blender | `src/app/` |

### 4.2 State Machine

**Locatie diagrama:** `docs/state_machine.png`

**Stari principale si descriere:**

| Stare | Descriere | Conditie Intrare | Conditie Iesire |
|-------|-----------|------------------|-----------------|
| `IDLE` | Asteptare input utilizator | Start aplicatie | Input valid |
| `PREPROCESS` | Validare si scalare features | Input disponibil | Features scalate |
| `RN_INFERENCE` | Inferenta RN + probabilitati | Input preprocesat | Predictie generata |
| `GENERATE_SCRIPT` | Generare script Blender | Clasa prezisa | Script generat |
| `RENDER_PREVIEW` | Randare preview (optional) | Script valid | OK / ERROR |
| `DISPLAY_RESULT` | Afisare rezultat final | Predictie/preview disponibil | Confirmare user |
| `ERROR` | Gestionare erori | Eroare in pipeline | Mesaj afisat |

**Justificare alegere arhitectura State Machine:**

Fluxul este gandit pentru interactiunea rapida cu utilizatorul: de la input numeric
la clasificare si generare procedural, cu o stare separata pentru erori Blender.
Separarea in stari clare permite testare modulara si trateaza explicit cazurile
in care randarea esueaza.

### 4.3 Actualizari State Machine in Etapa 6

Nu au fost necesare modificari; state machine-ul a ramas stabil intre Etapa 5 si 6.

---

## 5. Modelul RN – Antrenare si Optimizare

### 5.1 Arhitectura Retelei Neuronale

```
Input (shape: [8])
  -> Dense(32, ReLU)
  -> Dense(16, ReLU)
  -> Dense(4, Softmax)
Output: 4 clase (chair_simple, chair_with_backrest, bar_chair, stool)
```

**Justificare alegere arhitectura:**

MLP cu doua straturi ascunse este suficient pentru separarea claselor in date tabulare
sintetice si ofera un compromis bun intre complexitate si performanta.

### 5.2 Hiperparametri Finali (Model Optimizat - Etapa 6)

| Hiperparametru | Valoare Finala | Justificare Alegere |
|----------------|----------------|---------------------|
| Learning Rate | 0.001 | Valoare standard Adam, convergenta stabila |
| Batch Size | 32 | Compromis memorie/stabilitate pentru N=15,000 samples |
| Epochs | 10 | Durata suficienta pentru convergenta pe dataset sintetic |
| Optimizer | Adam | Optimizator adaptiv potrivit pentru MLP |
| Loss Function | Sparse Categorical Crossentropy | Clasificare multi-clasa cu 4 clase |
| Regularizare | EarlyStopping + ReduceLROnPlateau | Stabilitate si prevenire overfitting |
| Early Stopping | patience=5, monitor=val_loss | Oprire automata la convergenta |

### 5.3 Experimente de Optimizare (minim 4 experimente)

| Exp# | Modificare fata de Baseline | Accuracy | F1-Score | Timp Antrenare | Observatii |
|------|----------------------------|----------|----------|----------------|------------|
| **Baseline** | MLP 32-16, 50 epoci, ES+RLRP, augmentare | 0.9911 | 0.9915 | n/a | Referinta Etapa 5 |
| Exp 1 | Arhitectura mai ingusta: 16-8 | 0.9867 | 0.9861 | 6.85s | Performanta sub baseline |
| Exp 2 | Arhitectura mai larga: 64-32 | 0.9893 | 0.9894 | 6.76s | Cea mai buna dintre experimente, sub baseline |
| Exp 3 | Arhitectura mai adanca: 64-32-16 | 0.9862 | 0.9865 | 7.07s | Performanta buna, cost mai mare |
| Exp 4 | Baseline 32-16 (10 epoci, ES+RLRP) | 0.9858 | 0.9849 | 6.98s | Stabil, sub baseline |
| **FINAL** | MLP 32-16 (chair_model.h5) | **0.9911** | **0.9915** | n/a | Modelul folosit in productie |

**Justificare alegere model final:**

Experimentul baseline (32-16) ramane cel mai performant si cel mai stabil. Modelele
mai mari nu aduc imbunatatiri semnificative, iar modelele mai mici pierd acuratete.

**Referinte fisiere:** `results/chair_training_history.csv`, `results/chair_test_metrics.json`, `models/chair_model.h5`

---

## 6. Performanta Finala si Analiza Erori

### 6.1 Metrici pe Test Set (Model Optimizat)

| Metric | Valoare | Target Minim | Status |
|--------|---------|--------------|--------|
| **Accuracy** | 99.11% | >=70% | ✓ |
| **F1-Score (Macro)** | 0.9915 | >=0.65 | ✓ |
| **Precision (Macro)** | 0.9909 | - | - |
| **Recall (Macro)** | 0.9921 | - | - |

**Imbunatatire fata de Baseline (Etapa 5):**

| Metric | Etapa 5 (Baseline) | Etapa 6 (Optimizat) | Imbunatatire |
|--------|-------------------|---------------------|--------------|
| Accuracy | 99.11% | 99.11% | +0.00% |
| F1-Score | 0.9915 | 0.9915 | +0.0000 |

**Referinta fisier:** `results/chair_test_metrics.json`

### 6.2 Confusion Matrix

**Locatie:** `docs/confusion_matrix_optimized.png`

**Interpretare:**

| Aspect | Observatie |
|--------|------------|
| **Clasa cu cea mai buna performanta** | chair_simple / bar_chair (separare clara in majoritatea cazurilor) |
| **Clasa cu cea mai slaba performanta** | chair_with_backrest in cazuri cu backrest_height mic |
| **Confuzii frecvente** | bar_chair vs chair_simple, chair_with_backrest vs bar_chair |
| **Dezechilibru clase** | Distributie controlata la generare, fara dezechilibru major |

### 6.3 Analiza Top 5 Erori

| # | Input (descriere scurta) | Predictie RN | Clasa Reala | Cauza Probabila | Implicatie Industriala |
|---|--------------------------|--------------|-------------|-----------------|------------------------|
| 1 | backrest_height mic, seat_height mare | Simple Chair | Bar Chair | Proportii asemanatoare intre clase | Script Blender gresit pentru clasa | 
| 2 | leg_count=3, seat_height ridicat | Bar Chair | Chair with Backrest | Leg_count atipic | Necesita diversitate in date |
| 3 | backrest scurt, proportii apropiate | Simple Chair | Bar Chair | Lipsa feature derivat | Confuzii de stil | 
| 4 | leg_count=5, backrest mic | Simple Chair | Bar Chair | Varianta rara in dataset | Necesita augmentare targetata |
| 5 | backrest_height mic, style_variant=0 | Simple Chair | Chair with Backrest | Praguri apropiate in reguli | Ajustare generare date |

### 6.4 Validare in Context Industrial

Modelul obtine performante ridicate pe test set, ceea ce inseamna ca tipul de mobilier
este identificat corect in aproape toate cazurile. Pentru fluxul industrial, acest lucru
reduce timpul de selectie a tipului de obiect si scade riscul de generare a unui model
procedural gresit. In scenarii rare (confuzii intre bar_chair si simple chair), impactul
ar fi un model 3D cu dimensiuni nepotrivite, corectabil prin verificare vizuala rapida.

---

## 7. Aplicatia Software Finala

### 7.1 Modificari Implementate in Etapa 6

| Componenta | Stare Etapa 5 | Modificare Etapa 6 | Justificare |
|------------|---------------|-------------------|-------------|
| **Model incarcat** | `chair_model.h5` | `chair_model.h5` (final) | Varianta cu cel mai bun raport performanta/complexitate |
| **State Machine** | IDLE -> PREPROCESS -> RN_INFERENCE -> GENERATE_SCRIPT -> DISPLAY | Neschimbat | Flux stabil si suficient |
| **UI - feedback vizual** | Text + probabilitati + script | Neschimbat | UI integrata corect |
| **Logging** | Fara logging dedicat (doar output UI/console) | Neschimbat | Nu s-a introdus logging suplimentar |

### 7.2 Screenshot UI cu Model Optimizat

**Locatie:** `docs/screenshots/inference_optimized.png`

**Descriere:** Screenshotul confirma incarcare model final si afisarea predictiei in UI.

### 7.3 Demonstratie Functionala End-to-End

**Locatie dovada:** `docs/demo/demo_end_to_end.gif`

---

## 8. Structura Repository-ului Final

```
Proiect_RN/
├── README.md
├── CALDARARU_Denisa_Elena_631AB_README_Proiect_RN.md
├── docs/
│   ├── etapa3_analiza_date.md
│   ├── etapa4_arhitectura_sia.md
│   ├── etapa5_antrenare_model.md
│   ├── etapa6_optimizare_concluzii.md
│   ├── state_machine.png
│   ├── state_machine_v2.png
│   ├── confusion_matrix_optimized.png
│   ├── loss_curve.png
│   ├── demo/
│   ├── results/
│   │   ├── metrics_evolution.png
│   │   ├── learning_curves_final.png
│   │   └── example_predictions.png
│   ├── optimization/
│   │   ├── accuracy_comparison.png
│   │   └── f1_comparison.png
│   └── screenshots/
│       ├── ui_demo.png
│       ├── inference_real.png
│       └── inference_optimized.png
├── data/
│   ├── README.md
│   ├── generated/
│   ├── processed/
│   ├── chairs/
│   ├── tables/
│   ├── cabinets/
│   ├── fridges/
│   ├── stoves/
│   └── raw/
├── src/
│   ├── data_acquisition/
│   ├── preprocessing/
│   ├── neural_network/
│   ├── blender_scripts/
│   ├── blender_api/
│   └── app/
├── models/
├── results/
└── config/
```

### Legenda Progresie pe Etape

| Folder / Fisier | Etapa 3 | Etapa 4 | Etapa 5 | Etapa 6 |
|-----------------|:-------:|:-------:|:-------:|:-------:|
| `data/raw/`, `data/processed/`, `data/<obiect>/{train,validation,test}` | ✓ Creat | - | Actualizat* | - |
| `data/generated/` | - | ✓ Creat | - | - |
| `src/preprocessing/` | ✓ Creat | - | Actualizat* | - |
| `src/data_acquisition/` | - | ✓ Creat | - | - |
| `src/neural_network/model.py` | - | ✓ Creat | - | - |
| `src/neural_network/train.py`, `train_chair.py`, `evaluate.py` | - | - | ✓ Creat | - |
| `src/neural_network/optimize.py`, `compare_architectures.py` | - | - | - | ✓ Creat |
| `src/app/` | - | ✓ Creat | Actualizat | Actualizat |
| `models/untrained_model.*` | - | ✓ Creat | - | - |
| `models/chair_model.h5` | - | - | ✓ Creat | - |
| `models/chair_model.onnx` | - | - | ✓ Creat | - |
| `docs/state_machine.*` | - | ✓ Creat | - | (v2 optional) |
| `docs/etapa3_analiza_date.md` | ✓ Creat | - | - | - |
| `docs/etapa4_arhitectura_sia.md` | - | ✓ Creat | - | - |
| `docs/etapa5_antrenare_model.md` | - | - | ✓ Creat | - |
| `docs/etapa6_optimizare_concluzii.md` | - | - | - | ✓ Creat |
| `docs/confusion_matrix_optimized.png` | - | - | - | ✓ Creat |
| `docs/screenshots/` | - | ✓ Creat | Actualizat | Actualizat |
| `results/*_training_history.csv` | - | - | ✓ Creat | - |
| `results/chair_test_metrics.json` | - | - | ✓ Creat | - |
| **README.md** (acest fisier) | Draft | Actualizat | Actualizat | **FINAL** |

*Actualizat daca s-au adaugat date noi in Etapa 4*

### Conventie Tag-uri Git

| Tag | Etapa | Commit Message Recomandat |
|-----|-------|---------------------------|
| `v0.3-data-ready` | Etapa 3 | "Etapa 3 completa - Dataset analizat si preprocesat" |
| `v0.4-architecture` | Etapa 4 | "Etapa 4 completa - Arhitectura SIA functionala" |
| `v0.5-model-trained` | Etapa 5 | "Etapa 5 completa - Accuracy=0.9911, F1=0.9915" |
| `v0.6-optimized-final` | Etapa 6 | "Etapa 6 completa - Accuracy=0.9911, F1=0.9915 (optimizat)" |

---

## 9. Instructiuni de Instalare si Rulare

### 9.1 Cerinte Preliminare

```
Python >= 3.10
pip >= 21.0
```

### 9.2 Instalare

```bash
# Clonare repository
git clone https://github.com/taquitohh/Proiect-RN-Denisa-Elena-Caldararu
cd Proiect-RN-Denisa-Elena-Caldararu

# Creare mediu virtual
python -m venv .venv
# Activare (Windows)
.venv\Scripts\activate

# Instalare dependente
pip install -r requirements.txt
```

### 9.3 Rulare Pipeline Complet (chair)

```bash
# Generare date chair
python src/data_acquisition/generate_chairs.py

# Preprocesare + split
python src/preprocessing/chair_data_cleaner.py
python src/preprocessing/chair_feature_scaler.py
python src/preprocessing/chair_data_splitter.py

# Antrenare
python src/neural_network/train_chair.py

# Evaluare
python src/neural_network/evaluate.py

# Lansare UI
python src/app/main.py
```

### 9.4 Verificare Rapida

```bash
# Evaluare rapida pe test set
python src/neural_network/evaluate.py
```

---

## 10. Concluzii si Discutii

### 10.1 Evaluare Performanta vs Obiective Initiale

| Obiectiv Definit (Sectiunea 2) | Target | Realizat | Status |
|--------------------------------|--------|----------|--------|
| Reducere timp decizie tip obiect | <1s | 44.8 ms | ✓ |
| Accuracy pe test set | >=70% | 99.11% | ✓ |
| F1-Score pe test set | >=0.65 | 0.9915 | ✓ |

### 10.2 Ce NU Functioneaza – Limitari Cunoscute

1. Lipsa masurarii formale a latentei end-to-end.
2. Confuzii rare intre bar_chair si chair_simple la proportii apropiate.
3. Nu exista un demo video end-to-end in repo.

### 10.3 Lectii Invatate (Top 5)

1. Standardizarea feature-urilor este critica pentru stabilitatea MLP.
2. Early stopping previne suprainvatarea si scurteaza timpul de antrenare.
3. Augmentarea tabulara (zgomot gaussian) ajuta la generalizare.
4. Arhitecturile mai mari nu imbunatatesc neaparat performanta pe date sintetice.
5. Documentarea pe etape simplifica integrarea finala.

### 10.4 Retrospectiva

As adauga masuratori explicite de latenta si un demo end-to-end automatizat pentru a
validata mai bine scenariul industrial si pentru a oferi o dovada vizuala completa.

### 10.5 Directii de Dezvoltare Ulterioara

| Termen | Imbunatatire Propusa | Beneficiu Estimat |
|--------|----------------------|-------------------|
| **Short-term** | Masurare latenta inferenta si pipeline end-to-end | Stabilire praguri real-time |
| **Medium-term** | Extindere analiza erorilor cu reguli de imputare | Reducere confuzii intre clase | 
| **Long-term** | Deployment pe sistem embedded pentru prototip | Reducere latenta si costuri |

---

## 11. Bibliografie

1. Keras Documentation, 2024. https://keras.io/getting_started/
2. TensorFlow API, 2024. https://www.tensorflow.org/api_docs
3. Scikit-learn Metrics, 2024. https://scikit-learn.org/stable/modules/model_evaluation.html
4. Blender Python API, 2024. https://docs.blender.org/api/current/
5. Curs Retele Neuronale in cadrum UNSTPB, Conf.dr.ing. Bogdan ABAZA, 2025-2026.

---

## 12. Checklist Final (Auto-verificare inainte de predare)

### Cerinte Tehnice Obligatorii

- [x] **Accuracy >=70%** pe test set (verificat in `results/chair_test_metrics.json`)
- [x] **F1-Score >=0.65** pe test set
- [x] **Contributie >=40% date originale** (verificabil in `data/generated/`)
- [x] **Model antrenat de la zero** (nu pre-trained fine-tuning)
- [x] **Minimum 4 experimente** de optimizare documentate (tabel in Etapa 6)
- [x] **Confusion matrix** generata si interpretata
- [x] **State Machine** definit cu minimum 4-6 stari
- [x] **Cele 3 module functionale:** Data Logging, RN, UI
- [x] **Demonstratie end-to-end** disponibila in `docs/demo/`

### Repository si Documentatie

- [x] **README complet** (acest fisier)
- [x] **4 README-uri etape** prezente (etapa3..etapa6)
- [x] **Screenshots** prezente in `docs/screenshots/`
- [x] **Structura repository** conforma (adaptata la repo curent)
- [x] **requirements.txt** actualizat si functional
- [x] **Cod comentat** (minim 15% linii comentarii relevante)
- [x] **Toate path-urile relative**

### Acces si Versionare

- [x] **Repository accesibil** cadrelor didactice RN (public)
- [x] **Tag `v0.6-optimized-final`** creat si pushed
- [x] **Commit-uri incrementale** vizibile in `git log`
- [x] **Fisiere mari** (>100MB) excluse sau in `.gitignore`

### Verificare Anti-Plagiat

- [x] Model antrenat **de la zero** (weights initializate random, nu descarcate)
- [x] **Minimum 40% date originale**
- [x] Cod propriu sau clar atribuit (surse citate in Bibliografie)

---

## Note Finale

**Versiune document:** FINAL pentru examen  
**Ultima actualizare:** 11.02.2026  
**Tag Git:** `v0.6-optimized-final` (creat si pushed)
