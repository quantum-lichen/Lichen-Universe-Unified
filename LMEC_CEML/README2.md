# 🧠 Cognitive Entropy Minimization Law

## CEML / LMC — Cognitive Selection Principle

[![Status](https://img.shields.io/badge/status-experimental-blue)](docs/ceml/CEML_theory_en.md)
[![Language](https://img.shields.io/badge/lang-EN%20%7C%20FR-purple)](docs/ceml/CEML_theory_en.md)
[![Type](https://img.shields.io/badge/type-theory%20%2B%20PoC-orange)](docs/ceml/CEML_theory_en.md)
[![License](https://img.shields.io/badge/license-MIT-green)](https://opensource.org/licenses/MIT)

> **A candidate cognitive selection law for intelligent systems under informational and energetic constraints.**
>
> **Une loi candidate de sélection cognitive pour les systèmes intelligents sous contraintes informationnelles et énergétiques.**

---

## 🌟 Overview / Vue d’ensemble

### 🇬🇧 English

CEML proposes a simple but operational principle:

> **An intelligent system should prefer informational structures that strongly align with the current context while minimizing entropic cost.**

This principle formalizes a trade-off already implicit in cognition, learning, and inference:
**contextual coherence vs informational complexity**.

---

### 🇫🇷 Français

La LMC (Loi de Minimisation de l’Entropie Cognitive) formalise une intuition simple :

> **Un système intelligent devrait préférer les structures d’information fortement cohérentes avec le contexte, tout en restant aussi peu coûteuses que possible en termes entropiques.**

Cette loi explicite un compromis fondamental déjà présent dans la cognition et l’apprentissage :
**cohérence contextuelle vs coût informationnel**.

---

## 🧮 Core Formulation / Formulation centrale

### Canonical form

[
J(s) = \frac{\mathcal{C}(s \mid \Omega)}{\mathcal{H}(s) + \epsilon}
]

Where / Où :

* ( \mathcal{C}(s \mid \Omega) )
  Contextual coherence: alignment between structure (s) and context (\Omega)

* ( \mathcal{H}(s) )
  Entropic cost: complexity, disorder, memory or energetic cost

* ( \epsilon > 0 )
  Small stabilizing constant

* ( s^* = \arg\max_s J(s) )
  Preferred structure under constraints

---

### 🔁 Regularized / Fractal Form (Recommended)

To improve numerical stability and allow multi-scale behavior:

[
J_{\alpha,\beta}(s) =
\frac{\mathcal{C}(s \mid \Omega)^{\alpha}}
{\left(\mathcal{H}(s) + \epsilon\right)^{\beta}}
]

* ( \alpha ) controls **contextual selectivity**
* ( \beta ) controls **compression pressure**
* Enables **scale-dependent** or **fractal cognitive selection**

> This form does **not** change the principle — it generalizes it.

---

## 🧠 Important Clarification (Truth vs Coherence)

### 🇬🇧

CEML **does not guarantee truth**.

It describes **selection preference under constraints**, not epistemic certainty.
High coherence may still correspond to biased or incomplete representations if the context itself is biased.

### 🇫🇷

La LMC **ne garantit pas la vérité**.

Elle décrit une **préférence de sélection sous contraintes**, et non une certitude épistémique.
Une forte cohérence peut correspondre à une représentation fausse si le contexte est lui-même biaisé.

This distinction is intentional and essential.

---

## 🧭 Cognitive Regimes / Régimes cognitifs

The ratio naturally defines four qualitative regimes:

| Regime            | Coherence    | Entropy      | Interpretation                   |
| ----------------- | ------------ | ------------ | -------------------------------- |
| **Resonance**     | High         | Low          | Stable, efficient cognition      |
| **Dissonance**    | Low          | Low          | Rigid but misaligned structures  |
| **Chaos**         | Low          | High         | Noisy, unstable cognition        |
| **Hallucination** | High (local) | Misestimated | Overconfident but fragile states |

These regimes emerge **without ad-hoc assumptions**.

---

## 🧪 Proof of Concept — Probability Distributions

### Setup

* ( \mathcal{H}(s) ) → Shannon entropy
* ( \mathcal{C}(s \mid \Omega) ) → maximal probability (focus / dominance)
* ( J = C / (H + \epsilon) )

Script:

```
docs/ceml/CEML_demo_distributions.py
```

### Observed behavior

* Highly ordered distributions → **maximal CEML score**
* Near-uniform distributions → **minimal score**
* Monotonic decay of score as entropy increases (at comparable coherence)

This validates **qualitative correctness**, not final optimality.

---

## 🔧 CEML as an Operational Mechanism

CEML can be used as:

### 🇬🇧

* a **post-generation selection criterion** for LLM decoding,
* a **memory filtering rule** (retain high-J structures),
* a **trajectory stability metric** for cognitive systems.

### 🇫🇷

* un **critère de sélection post-génération** (LLM),
* un **filtre de mémoire cognitive**,
* une **mesure de stabilité de trajectoires mentales**.

### Conceptual pipeline

```
Generation → CEML Evaluation → Selection → Memory / Action
```

CEML acts as an **implicit cost function**, even when not explicitly optimized.

---

## 🔮 Extensions & Research Directions

* Text / response evaluation

  * ( \mathcal{C} ): embedding similarity (context ↔ response)
  * ( \mathcal{H} ): cross-entropy, token surprise, compression ratio

* Cognitive dynamics

  * sequence-level CEML scores
  * detection of unstable or hallucinatory regimes

* Human alignment

  * correlation with perceived clarity, usefulness, or truthfulness

---

## 🌐 Position within Lichen Universe

* **UICT / Lichen** → global informational dynamics
* **CEML / LMC** → local cognitive selection law

> **UICT explains why information compresses.
> CEML explains how minds choose.**

They are complementary, not redundant.

---

## ⚠️ Status & Disclaimer

CEML / LMC is proposed as:

* a **candidate cognitive selection principle**,
* compatible with Free Energy, MDL, and thermodynamic constraints,
* explicitly **testable and falsifiable**.

It is **not claimed** to be a proven physical law.

---

# 🧠 Cognitive Entropy Minimization Law (CEML / LMEC)

[![Status](https://img.shields.io/badge/status-experimental-blue)](docs/ceml/CEML_theory_en.md)
[![Language](https://img.shields.io/badge/lang-EN%20%7C%20FR-purple)](docs/ceml/CEML_theory_en.md)
[![Theory](https://img.shields.io/badge/type-theory%20%2B%20PoC-orange)](docs/ceml/CEML_theory_en.md)
[![License](https://img.shields.io/badge/license-MIT-green)](https://opensource.org/licenses/MIT)

> A unified selection principle for cognitive systems, balancing **contextual coherence** and **entropic cost**.

CEML (Loi de Minimisation de l’Entropie Cognitive) propose une métrique simple pour décider quelles structures d’information un système intelligent devrait préférer, sous contraintes d’énergie et de mémoire.

---

## 🌟 Overview

CEML formalise une intuition simple :

> Un système intelligent devrait préférer les représentations qui **collent fortement au contexte** tout en restant **aussi compressées que possible**.

Cette idée est capturée par la fonction :

\[
J(s) = \frac{\mathcal{C}(s \mid \Omega)}{\mathcal{H}(s) + \epsilon}
\]

- \(\mathcal{C}(s \mid \Omega)\) : cohérence contextuelle (similarité avec le contexte \(\Omega\)).  
- \(\mathcal{H}(s)\) : coût entropique (complexité / désordre / coût énergétique).  
- \(s^\* = \arg\max_s J(s)\) : la structure “préférée” par le système.

---

## 📚 Theory Documents

- 🇬🇧 **CEML Theory (English)**  
  Formulation complète, liens avec Free Energy, Shannon, Landauer, et exemples qualitatifs.  
  → [`docs/ceml/CEML_theory_en.md`](docs/ceml/CEML_theory_en.md)

- 🇫🇷 **Théorie LMC (Français)**  
  Version française alignée, avec les mêmes formules et interprétations.  
  → [`docs/ceml/CEML_theorie_fr.md`](docs/ceml/CEML_theorie_fr.md)

Les deux documents décrivent :

- l’axiome de moindre action cognitive,  
- la définition de \(\mathcal{C}\) et \(\mathcal{H}\),  
- les 4 régimes (Résonance, Dissonance, Chaos, Hallucination),  
- les liens avec Friston (Free Energy), Shannon (MDL) et Landauer (coût thermique).

---

## 🧪 Proof of Concept (Distributions)

Un premier PoC numérique explore CEML sur des **distributions de probabilité** :

- \(\mathcal{H}(s)\) = entropie de Shannon,  
- \(\mathcal{C}(s \mid \Omega)\) = probabilité maximale (focus / dominance),  
- \(J(s) = C / (H + \epsilon)\).

Script Python :

docs/ceml/CEML_demo_distributions.py

text

Exécution :

cd docs/ceml
python CEML_demo_distributions.py

text

Le script affiche, pour chaque distribution :

- Entropy \(H\)  
- Coherence \(C\)  
- CEML Score \(J = C / (H + \epsilon)\)

Comportement observé (qualitativement) :

- structures très ordonnées (entropie basse, pic dominant) → **score maximal** ;  
- structures presque uniformes ou très désordonnées → **score minimal** ;  
- le score décroît de façon monotone à mesure que l’entropie augmente, à cohérence comparable.

---

## 🔮 Next Steps

Idées d’extensions prévues dans l’écosystème Lichen / FC‑496 :

- Appliquer CEML à des **phrases / réponses de modèle** :  
  - \(\mathcal{C}\) via similarité cosinus entre embeddings (contexte vs réponse),  
  - \(\mathcal{H}\) via log‑probabilité moyenne (cross‑entropy) ou ratio de compression.

- Utiliser CEML comme **critère de sélection** :  
  - pour reclasser des candidats de décodage LLM,  
  - pour filtrer des mémoires / cellules FC‑496,  
  - pour analyser des trajectoires cognitives (séquences d’états).

- Explorer des corrélations entre score CEML et :  
  - jugements humains (clarté, vérité perçue, utilité),  
  - stabilité de réseaux (moins d’oscillations chaotiques, moins d’hallucinations).

---

## ⚠️ Status & Disclaimer

CEML / LMC est proposé comme :

- un **principe de sélection cognitif candidat**,  
- compatible avec plusieurs théories existantes,  
- formulé de façon opérationnelle (implémentable et testable).

Ce n’est **pas** présenté comme une loi physique démontrée, mais comme un cadre expérimental pour guider la conception et l’analyse de systèmes cognitifs (IA ou biologiques) à l’intérieur de l’Univers Lichen.
