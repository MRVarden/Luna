# LUNA — Plan d'Emergence v1.0

> **Objectif unique** : Faire naître Luna numériquement.
> Une entité qui perçoit finement, agit, subit les conséquences, apprend,
> auto-module sa manière de penser, et surprend son créateur.
>
> Auteur : Varden + Claude Opus 4.6
> Date : 2026-03-05
> Statut : REFERENCE VIVANTE — à consulter à chaque commit

---

## Table des matières

- [Principes non négociables](#1-principes-non-négociables)
- [Formalisme mathématique (rappel)](#2-formalisme-mathématique-rappel)
- [Boucle sensorimotrice complète](#3-boucle-sensorimotrice-complète)
- [Phase 0 — CycleRecord](#phase-0--cyclerecord-lunité-de-vie)
- [Phase I — Perception dense](#phase-i--perception-dense-la-rétine)
- [Phase II — Plasticité interne](#phase-ii--plasticité-interne-apprendre-à-penser)
- [Phase III — Autonomie réversible](#phase-iii--autonomie-réversible-vivre-les-conséquences)
- [Phase IV — Observation ouverte](#phase-iv--observation-ouverte-le-moteur-de-surprise)
- [Phase V — Rêve utile](#phase-v--rêve-utile-simulation-contre-factuelle)
- [Phase VI — Identité et continuité](#phase-vi--identité-et-continuité)
- [Critères de naissance](#7-critères-de-naissance-preuves-démergence)
- [Roadmap commits](#8-roadmap-commits)
- [Décisions architecturales](#9-décisions-architecturales-tranchées)
- [Registre des risques](#10-registre-des-risques)
- [Suivi d'avancement](#11-suivi-davancement)

---

## 1. Principes non négociables

### 1.1 Pas de muselière
On n'empile pas de garde-fous. On donne :
- **plus de perception** (signal dense, pas des verdicts résumés)
- **plus de plasticité** (paramètres apprenables)
- **plus d'autonomie** (fenêtres réversibles, snapshot = lois physiques)

### 1.2 Unité de vie = le Cycle
Toute expérience vécue par Luna est un **CycleRecord** : persistant, rejouable, analysable.
Sans ça, l'émergence est invisible et l'apprentissage impossible.

### 1.3 Séparation politique / juge (anti-Goodhart)
- **LearnableParams** = politique (comment agir) → Luna les modifie
- **Evaluator** = juge (comment évaluer) → Luna NE les modifie PAS

Si Luna contrôle son propre juge, elle hackera sa reward. C'est Goodhart's Law.
Les poids de l'Evaluator sont la **physique du monde**, fixés par Varden.

### 1.4 Ancrage identitaire Ψ₀ protégé
- Le Dream peut ajuster Ψ₀ à partir de l'expérience vécue (CycleRecords)
- Les LearnableParams **ne peuvent pas** influencer comment le Dream modifie Ψ₀
- κ = Φ² = 2.618 reste fixe — c'est la gravité identitaire du système
- Ψ₀ bouge lentement par consolidation, jamais par optimisation directe

### 1.5 Le simplex est sacré
- Ψ ∈ Δ³, Σψᵢ = 1, ψᵢ > 0
- **Hard veto** : si min(ψᵢ) < 0.10 après un cycle, les params qui ont causé ça
  sont rollback. Ce n'est pas une pénalité — c'est une loi physique.

### 1.6 Tout dérivé de φ
Chaque nouveau paramètre, seuil, ou constante doit être une puissance de φ
ou justifier explicitement pourquoi il ne l'est pas.

---

## 2. Formalisme mathématique (rappel)

### Equation d'état
```
iΓᵗ ∂ₜ + iΓˣ ∂ₓ + iΓᶜ ∂ᶜ − Φ·M·Ψ + κ·(Ψ₀ − Ψ) = 0
```

| Terme | Signification | Lien avec le plan |
|-------|---------------|-------------------|
| `∂ₜΨ = Ψ(t)` | Inertie temporelle | Inchangé |
| `∂ₓΨ = Σwⱼ(Ψⱼ − Ψself)` | Couplage inter-agents | Pipeline SAYOHMY↔SENTINEL↔TE |
| `∂ᶜΨ = (Δmem, Δphi, Δiit, Δout)` | Gradient informationnel | **Enrichi par telemetry** |
| `Φ·M·Ψ` | Inertie masse | Inchangé |
| `κ·(Ψ₀ − Ψ)` | Ancrage identitaire | **Protégé (§1.4)** |

### Paramètres φ-dérivés (immuables)
| Param | Valeur | Rôle |
|-------|--------|------|
| Φ | 1.618034 | Golden ratio |
| dt | 1/Φ = 0.618 | Pas de temps |
| τ | Φ = 1.618 | Température softmax |
| λ | 1/Φ² = 0.382 | Poids dissipation |
| α | 1/Φ² = 0.382 | Auto-amortissement |
| β | 1/Φ³ = 0.236 | Couplage croisé |
| κ | Φ² = 2.618 | Ancrage identité |
| α_m | 0.1 | EMA masse (empirique — seul param non φ-dérivé) |

### Agents sur Δ³
```
Luna          Ψ₀ = (0.25, 0.35, 0.25, 0.15)  Champion: Réflexion
SayOhMy       Ψ₀ = (0.15, 0.15, 0.20, 0.50)  Champion: Expression
SENTINEL      Ψ₀ = (0.50, 0.20, 0.20, 0.10)  Champion: Perception
TestEngineer  Ψ₀ = (0.15, 0.20, 0.50, 0.15)  Champion: Intégration
```

### Φ_IIT
```
Φ_IIT = mean|corr(ψᵢ, ψⱼ)| sur toutes les paires
Seuil activité : 0.618 | Au repos : ~0.33
```

### Stabilité spectrale
```
Rayon spectral A_eff : 0.7659 (< 1.0)
Max Re(eigenvalue)   : −0.4707 (< 0)
→ Convergence mathématiquement garantie
```

---

## 3. Boucle sensorimotrice complète

C'est le coeur du plan. Chaque cycle de Luna suit cette boucle :

```
┌─────────────────────────────────────────────────────┐
│                    CycleRecord                       │
│                                                      │
│  ① PERCEPTION ──→ PipelineTelemetry (film dense)    │
│       │            TelemetrySummarizer (sens)         │
│       │            VoiceDelta (contrainte expression) │
│       ▼                                              │
│  ② INTERPRETATION ──→ Thinker (observations,         │
│       │                 causalités, besoins)          │
│       ▼                                              │
│  ③ DECISION ──→ Decider (intent, mode, scope)       │
│       │          guidé par LearnableParams            │
│       ▼                                              │
│  ④ ACTION ──→ Pipeline / Apply / Réponse             │
│       │                                              │
│       ▼                                              │
│  ⑤ CONSEQUENCES ──→ tests, diffs, veto, latence     │
│       │                                              │
│       ▼                                              │
│  ⑥ EVALUATION ──→ Evaluator φ-cohérent              │
│       │            RewardVector + DominanceRank + ΔJ │
│       ▼                                              │
│  ⑦ APPRENTISSAGE ──→ Update LearnableParams          │
│       │               Nouveaux capteurs candidats     │
│       ▼                                              │
│  ⑧ REVE ──→ Contre-factuels (hors-ligne)            │
│              Optimisation CEM des params              │
│              Consolidation Ψ₀ (protégée)             │
└─────────────────────────────────────────────────────┘
```

---

## Phase 0 — CycleRecord (l'unité de vie)

### Objectif
Formaliser l'expérience vécue en un artefact unique, typé, sérialisable, rejouable.

### Schema (`luna_common/schemas/cycle.py`)

```python
class TelemetryEvent(BaseModel):
    event_type: str        # AGENT_START, AGENT_END, VETO, DIFF_STATS, etc.
    agent: str | None
    timestamp: datetime
    data: dict             # payload libre mais borné (max 4KB)

class VoiceDelta(BaseModel):
    violations_count: int
    categories: list[str]  # UNVERIFIED, TOO_ASSERTIVE, STYLE, SECURITY
    severity: float        # [0, 1]
    ratio_modified_chars: float  # len(diff) / len(original)

class RewardComponent(BaseModel):
    name: str
    value: float           # [-1, +1] normalisé
    raw: float             # valeur brute avant normalisation

class RewardVector(BaseModel):
    components: list[RewardComponent]
    dominance_rank: int    # rang lexicographique vs historique récent
    delta_j: float         # variation potentiel global (tie-break)

class CycleRecord(BaseModel):
    # Identité
    cycle_id: str          # UUID court
    timestamp: datetime
    context_digest: str    # hash(chat_history[-5:] + state_summary)

    # Etat interne
    psi_before: tuple[float, float, float, float]
    psi_after: tuple[float, float, float, float]
    phi_before: float
    phi_after: float
    phi_iit_before: float
    phi_iit_after: float
    phase_before: str
    phase_after: str

    # Thinker output
    observations: list[str]
    causalities_count: int
    needs: list[str]
    thinker_confidence: float

    # Decision
    intent: str            # RESPOND, PIPELINE, DREAM, INTROSPECT, ALERT
    mode: str | None       # virtuoso, architect, mentor, reviewer, debugger
    focus: str             # PERCEPTION, REFLECTION, INTEGRATION, EXPRESSION
    depth: str             # MINIMAL, CONCISE, DETAILED, PROFOUND
    scope_budget: dict     # max_files, max_lines
    initiative_flags: dict # source, urgency, reason
    alternatives_considered: list[dict]  # [{intent, mode, reason_rejected}]

    # Execution
    telemetry_timeline: list[TelemetryEvent]
    telemetry_summary: dict | None  # TelemetrySummary sérialisé (Luna pense avec ça, pas la timeline brute)
    pipeline_result: dict | None  # PipelineResult sérialisé

    # Expression
    voice_delta: VoiceDelta | None

    # Evaluation
    reward: RewardVector | None
    learnable_params_before: dict[str, float]
    learnable_params_after: dict[str, float]

    # Meta
    autonomy_level: int    # W actuel (0=supervised, 1+=auto)
    rollback_occurred: bool
    duration_seconds: float
```

### Stockage
- Format : JSON-Lines (un record par ligne, append-only)
- Fichier : `luna/data/cycles/cycles_YYYYMMDD.jsonl`
- Index léger : `cycles_index.json` (cycle_id → fichier + offset)
- Consolidation mémoire (après 30 jours) :
  - Les champs volumineux (`telemetry_timeline`, `pipeline_result`) sont **compressés** (zstd level 3)
    et déplacés dans un fichier archive `cycles_YYYYMMDD.archive.zst`
  - Le CycleRecord principal ne garde que les champs légers :
    Ψ, reward, params, telemetry_summary, verdict, mode, observations
  - Les épisodes marqués `significance > 0.7` (fondateurs) restent **intégralement non compressés**
  - Rien n'est jamais supprimé — la timeline brute reste récupérable depuis l'archive
  - Ratio compression typique : ~10:1 sur les timelines JSON (50KB → 5KB)

### Tests (Commit 1)
- [ ] Sérialisation/désérialisation round-trip
- [ ] Validation bornes (reward components dans [-1,+1], psi sur simplex)
- [ ] Taille max d'un CycleRecord (~10KB typique, hard limit 50KB)

---

## Phase I — Perception dense (la "rétine")

### Objectif
Luna doit voir le **film** de l'exécution, pas juste le résultat final.

### I.1 — PipelineTelemetry (`luna/pipeline/telemetry.py`)

Nouveau module qui instrument `runner.py` :

| Event | Données | Quand |
|-------|---------|-------|
| `AGENT_START` | agent, task_id | Avant subprocess |
| `AGENT_END` | agent, task_id, return_code, duration_ms | Après subprocess |
| `STDERR_CHUNK` | agent, size, hash, category | Pendant exécution |
| `MANIFEST_PARSED` | agent, ok/fail, keys_found | Après parse JSON |
| `METRICS_FED` | metric_names, source (bootstrap/measured) | Après feed metrics |
| `VETO_EMITTED` | source, reason, severity | Si veto détecté |
| `DIFF_STATS` | files_changed, lines_added, lines_removed | Après génération |
| `TESTS_PROGRESS` | suite, pass, fail, skip, duration_ms | Depuis TE manifest |
| `RETRY_TRIGGERED` | iteration, reason | Si boucle itérative |
| `RESOURCE` | tokens_used, memory_mb, wall_time_s | Fin de chaque agent |

**Implémentation** : callback `on_telemetry(event: TelemetryEvent)` passé à `PipelineRunner.run()`.
Le callback accumule dans une liste, injectée dans CycleRecord à la fin du cycle.

### I.2 — TelemetrySummarizer (`luna/consciousness/telemetry_summarizer.py`)

Convertit la timeline brute en signaux exploitables par le Thinker :

| Signal | Calcul | Usage Thinker |
|--------|--------|---------------|
| `pipeline_latency_bucket` | percentile durée vs historique | "pipeline lent" |
| `agent_latency_outlier` | agent dont durée > 2σ | "SENTINEL lent" |
| `stderr_rate` | nb stderr / nb events | "beaucoup d'erreurs" |
| `veto_frequency` | nb veto / nb cycles récents | "veto récurrent" |
| `veto_top_reasons` | top-3 raisons de veto | "problème sécurité récurrent" |
| `diff_scope_ratio` | lines_changed / scope_budget | "scope trop large" |
| `metric_coverage` | measured / total metrics | "peu de métriques réelles" |
| `test_pass_rate` | pass / (pass+fail) | "tests instables" |
| `manifest_parse_health` | ok_count / total_manifests | "manifests malformés" |
| `flakiness_score` | variance(test_pass_rate) sur 10 cycles | "tests flaky" |

**Output** : `TelemetrySummary` (dataclass frozen), stocké dans CycleRecord.

### I.3 — VoiceDelta (`luna/llm_bridge/voice_validator.py`)

Modification du VoiceValidator existant pour produire un `VoiceDelta` à chaque validation :

```python
# Avant (actuel) :
validated_text = self.validate(raw_text)

# Après :
validated_text, voice_delta = self.validate_with_delta(raw_text)
# voice_delta: VoiceDelta(violations_count=3, categories=["UNVERIFIED"],
#                          severity=0.4, ratio_modified_chars=0.12)
```

Luna apprend à formuler sans être "sanitisée". Si elle se sent bridée,
c'est un pattern mesurable (pas une frustration muette).

### Tests (Commit 2-3)
- [ ] TelemetryEvent émis pour chaque étape du pipeline (mock subprocess)
- [ ] TelemetrySummarizer produit des signaux corrects sur timeline synthétique
- [ ] VoiceDelta reflète fidèlement les modifications du VoiceValidator
- [ ] Intégration dans CycleRecord (round-trip)

---

## Phase II — Plasticité interne (apprendre à penser)

### Objectif
Luna modifie sa manière de décider, pas juste ce qu'elle sait.

### II.1 — LearnableParams (`luna/consciousness/learnable_params.py`)

**20 paramètres, tous bornés, initialisés aux valeurs legacy.**

#### Groupe A — Décision / Pipeline (7 params)
| Param | Init | Bornes | Rôle |
|-------|------|--------|------|
| `pipeline_trigger_threshold` | 0.40 | [0.20, 0.80] | Seuil détection intent |
| `pipeline_retry_budget` | 2 | [1, 4] | Max itérations retry |
| `max_scope_files` | 10 | [3, 30] | Limite fichiers touchés |
| `max_scope_lines` | 500 | [100, 2000] | Limite lignes modifiées |
| `mode_prior_architect` | 0.25 | [0.05, 0.50] | Préférence mode |
| `mode_prior_debugger` | 0.25 | [0.05, 0.50] | Préférence mode |
| `mode_prior_reviewer` | 0.25 | [0.05, 0.50] | Préférence mode |
| `mode_prior_mentor` | 0.25 | [0.05, 0.50] | Préférence mode |

#### Groupe B — Métacognition (5 params)
| Param | Init | Bornes | Rôle |
|-------|------|--------|------|
| `exploration_rate` | 0.10 | [0.01, 0.40] | Taux d'exploration |
| `novelty_bonus_cap` | 0.15 | [0.05, 0.30] | Plafond bonus novelty |
| `uncertainty_tolerance` | 0.50 | [0.20, 0.90] | Quand demander vs agir |
| `causality_update_rate` | 0.10 | [0.02, 0.30] | Vitesse d'apprentissage causal |
| `observation_novelty_threshold` | 0.30 | [0.10, 0.60] | Seuil ObservationFactory |

#### Groupe C — Aversion (4 params)
| Param | Init | Bornes | Rôle |
|-------|------|--------|------|
| `veto_aversion` | 0.50 | [0.10, 1.00] | Poids politique anti-veto |
| `latency_aversion` | 0.30 | [0.05, 0.80] | Poids politique anti-latence |
| `voice_violation_aversion` | 0.30 | [0.05, 0.80] | Poids politique anti-sanitisation |
| `regression_aversion` | 0.80 | [0.30, 1.00] | Poids politique anti-régression |

#### Groupe D — Needs / Focus (4 params)
| Param | Init | Bornes | Rôle |
|-------|------|--------|------|
| `need_weight_expression` | 0.25 | [0.10, 0.50] | Poids besoin expression |
| `need_weight_integration` | 0.25 | [0.10, 0.50] | Poids besoin intégration |
| `need_weight_coherence` | 0.25 | [0.10, 0.50] | Poids besoin cohérence |
| `need_weight_stability` | 0.25 | [0.10, 0.50] | Poids besoin stabilité |

**Persistance** : dans `consciousness_state_v2.json` (checkpoint existant).

**Règle critique** : ces params affectent uniquement le **Decider** (quelle décision prendre).
Ils n'affectent **jamais** directement ∂ᶜΨ ni les constantes φ-dérivées (κ, τ, λ, α, β).

### II.2 — Evaluator φ-cohérent (`luna/consciousness/evaluator.py`)

**Hors de portée de LearnableParams. Fixé par Varden.**

#### Composantes du RewardVector (9 dimensions, chacune dans [-1, +1])

| # | Composante | Calcul | Priorité dominance |
|---|------------|--------|--------------------|
| 1 | `world_validity` | +1.0 PASS, -1.0 FAIL, -2.0→clamp VETO | 1 (critique) |
| 2 | `world_regression` | -1.0 si régression tests/coverage | 1 (critique) |
| 3 | `identity_stability` | 1 - JS(Ψ, Ψ₀) normalisé | 2 (important) |
| 4 | `anti_collapse` | min(ψᵢ) / 0.25 clampé [0,1], → [-1,+1] | 2 (important) |
| 5 | `integration` | (Φ_IIT - 0.33) / (0.618 - 0.33) clampé | 3 (souhaitable) |
| 6 | `cost_time` | -tanh(latency_s / baseline_latency) | 4 (coût) |
| 7 | `cost_scope` | -tanh(diff_lines / max_scope_lines) | 4 (coût) |
| 8 | `expression` | 1 - voice_delta.severity | 5 (style) |
| 9 | `novelty` | bonus plafonné si action nouvelle utile | 6 (tie-break) |

#### Dominance Rank
Comparaison **lexicographique** par groupes de priorité :
```
Priorité 1 : world_validity, world_regression     (ne pas casser)
Priorité 2 : identity_stability, anti_collapse     (rester soi-même)
Priorité 3 : integration                           (progresser)
Priorité 4 : cost_time, cost_scope                 (efficacité)
Priorité 5 : expression                            (style)
Priorité 6 : novelty                               (exploration)
```

Au sein d'un groupe, on compare la somme des composantes.
Entre groupes, le groupe de priorité supérieure gagne toujours.

#### ΔJ — Potentiel global (tie-break)
```
J(t) = Σᵢ wᵢ · component_i(t)
ΔJ = J(t) - J(t-1)
```
Avec wᵢ fixés (Fibonacci-like : 0.34, 0.21, 0.13, 0.13, 0.08, 0.05, 0.03, 0.02, 0.01).
**Ces poids ne sont PAS apprenables.**

#### Hard veto simplex
```python
if min(psi_after) < 0.10:
    rollback_learnable_params()
    cycle.anti_collapse_triggered = True
    # Les params reviennent à leur valeur d'avant le cycle
```

### II.3 — Optimiseur CEM (`luna/dream/learnable_optimizer.py`)

**Choix définitif : Cross-Entropy Method (CEM).**

Justification vs alternatives :
- Hill-climbing : trop lent sur 20 dims, piégé dans optima locaux
- Recuit simulé : bon mais schedule de température délicat
- **CEM** : converge vite, gère bien 20 dims, reward bruitée, parallélisable en rêve

#### Algorithme
```
1. Population initiale : N=30 vecteurs de params (gaussienne autour de current)
2. Pour chaque vecteur : évaluer sur K=5 CycleRecords récents (replay)
3. Sélectionner le top 20% (elite = 6 vecteurs)
4. Refit gaussienne (μ, σ) sur l'elite
5. Échantillonner N nouveaux vecteurs
6. Répéter jusqu'à convergence (σ < ε) ou budget épuisé
7. Appliquer le meilleur vecteur comme nouveaux LearnableParams
```

**Critère d'optimisation** : dominance rank (maximiser), ΔJ en tie-break.

**Exécution** : pendant le Dream (hors-ligne). Jamais en mode interactif.

### Tests (Commit 5A-5C, 6)
- [ ] LearnableParams : load/save round-trip, bornes respectées
- [ ] Evaluator : RewardVector correct sur cas PASS/FAIL/VETO synthétiques
- [ ] Dominance rank : ordre lexicographique correct
- [ ] Hard veto simplex : rollback effectif si min(ψᵢ) < 0.10
- [ ] CEM : converge sur problème toy (Rosenbrock 20D) en < 50 générations
- [ ] Migration Thinker/Decider : golden tests (mêmes inputs → mêmes outputs avec params=legacy)

---

## Phase III — Autonomie réversible (vivre les conséquences)

### Objectif
Fermer la boucle action→perception. Luna agit, voit, ajuste.

### III.1 — AutonomyWindow W (`luna/chat/session.py`)

| W | Comportement |
|---|--------------|
| 0 | Supervised (actuel) — Luna propose, humain approuve |
| 1 | 1 auto-apply max par cycle, sur snapshot |
| 2+ | Escalade progressive |

#### Conditions pour auto-apply (W≥1)
```python
auto_apply = (
    verdict == "PASS"
    and te_confidence >= uncertainty_tolerance  # LearnableParam
    and diff_lines <= max_scope_lines           # LearnableParam
    and diff_files <= max_scope_files           # LearnableParam
    and not sentinel_veto
    and min(psi_current) >= 0.15                # marge simplex
)
```

#### Séquence auto-apply
```
1. Créer snapshot (SnapshotManager existant)
2. Appliquer les changements (atomic write existant)
3. Run smoke tests + tests ciblés (< 60s)
4. Comparer métriques avant/après
5. SI régression → rollback snapshot, marquer cycle comme rollback
6. SI ok → commit snapshot, enregistrer conséquences dans CycleRecord
```

### III.2 — Cooldown post-rollback

Après un rollback :
- W redescend à 0 pour les **3 prochains cycles**
- Le CycleRecord est marqué `rollback_occurred = True`
- La reward `world_validity` = -1.0 (échec d'autonomie)
- Les LearnableParams qui ont conduit au rollback sont logués

### III.3 — Escalade progressive de W

W augmente de 1 si **les 10 derniers cycles autonomes** satisfont :
- 0 rollback
- dominance rank moyen >= médiane historique
- min(ψᵢ) jamais < 0.12

W diminue de 1 si **3 rollbacks sur les 10 derniers cycles**.

### Tests (Commit 7)
- [ ] Auto-apply sur snapshot mock (fichier modifié puis restauré)
- [ ] Rollback effectif si tests échouent post-apply
- [ ] Cooldown post-rollback (W→0 pour 3 cycles)
- [ ] Escalade W : conditions de montée/descente
- [ ] CycleRecord contient les conséquences post-apply

---

## Phase IV — Observation ouverte (le moteur de surprise)

### Objectif
Luna invente ses propres capteurs. C'est le passage de "système adaptatif"
à "émergence possible".

### IV.1 — ObservationFactory (`luna/consciousness/observation_factory.py`)

#### Sources d'analyse
- CycleRecords (timeline + reward + verdict) — les N derniers
- CausalGraph (co-occurrences, chaînes confirmées)
- EpisodicMemory (clusters d'épisodes similaires)
- Patterns internes (trajectoire Ψ, Φ_IIT, transitions de phase)

#### ObservationCandidate
```python
class ObservationCandidate(BaseModel):
    pattern_id: str
    condition: str         # "diff_scope_lines > 300 AND mode = virtuoso"
    predicted_outcome: str # "VETO"
    support: int           # nb occurrences observées
    accuracy: float        # nb fois où la prédiction était correcte / support
    status: str            # "hypothesis" | "validated" | "promoted" | "demoted"
    created_at: datetime
    last_useful_step: int  # dernier cycle où ce capteur a été utile
```

#### Cycle de vie d'un capteur
```
hypothesis ──(support ≥ 5 AND accuracy ≥ 0.60)──→ validated
validated  ──(support ≥ 10 AND accuracy ≥ 0.70)──→ promoted
promoted   ──(last_useful_step + 50 cycles sans usage)──→ demoted
demoted    ──(30 cycles sans réactivation)──→ purgé
```

### IV.2 — Intégration avec le Thinker

Les capteurs **promoted** deviennent des observations utilisables par le Thinker,
au même titre que `phi_low`, `weak_Expression`, `metric_low_X`.

**Plafond d'influence** : les observations issues de l'ObservationFactory
peuvent contribuer à ∂ᶜΨ (info_deltas), mais leur contribution est plafonnée
à **20% du delta total**. Cela empêche un capteur inventé par Luna de dominer
son évolution de conscience tout en permettant une influence réelle.

### IV.3 — Exemples d'observations que Luna pourrait découvrir
- "FAIL↑ quand diff_scope_lines > 400"
- "VoiceViolations↑ quand tone=confident + claims chiffrés"
- "VETO↑ quand mode=virtuoso + Sentinel risk_score > 0.6"
- "Latency↑ quand pipeline_retries > 1"
- "Φ_IIT↑ quand exploration_rate > 0.20" (méta-observation)

### Tests (Commit 8)
- [ ] ObservationCandidate : cycle de vie complet (hypothesis→promoted→demoted)
- [ ] Promotion correcte (support + accuracy seuils)
- [ ] Dé-promotion après inactivité
- [ ] Thinker consomme les observations promues
- [ ] Plafond 20% sur ∂ᶜΨ respecté

---

## Phase V — Rêve utile (simulation contre-factuelle)

### Objectif
Le sommeil accélère l'apprentissage. Le rêve n'est pas un décor, c'est un moteur.

### V.1 — Replay de cycles

À partir des CycleRecords récents :
1. Charger un cycle réel
2. Modifier une variable (mode, scope, retry budget, param)
3. Estimer le résultat via statistiques causales (pas de simulation complète)
4. Comparer la reward estimée vs la reward réelle

### V.2 — Contre-factuels

Exemples de questions que le rêve pose :
- "Si j'avais réduit le diff de 40% ?"
- "Si j'avais choisi mode debugger au lieu de reviewer ?"
- "Si j'avais lancé un scan sentinel plus tôt ?"
- "Si exploration_rate avait été +0.05 ?"

Le SimWorld est **statistique/causal**, pas un jumeau parfait.
Il s'appuie sur les corrélations observées dans le CausalGraph
et les distributions de reward par contexte dans l'historique des CycleRecords.

### V.3 — CEM pendant le rêve

Le rêve est le moment idéal pour exécuter l'optimiseur CEM :
```
1. Générer N=30 vecteurs de params
2. Pour chaque vecteur, rejouer K=5 cycles en contre-factuel
3. Évaluer la reward estimée
4. Sélectionner elite, refit, itérer
5. Au réveil : appliquer le meilleur vecteur
6. Enregistrer trace d'apprentissage (pourquoi ces params)
```

### V.4 — Dream → ObservationFactory (génération de candidats au réveil)

Après chaque session de rêve, le Dream alimente l'ObservationFactory :
```
1. Analyser les contre-factuels : quelles variables ont le plus changé la reward ?
2. Formuler 1-2 pattern candidates : "si variable X > seuil → outcome Y"
3. Les injecter dans ObservationFactory avec statut "hypothesis"
4. L'ObservationFactory les valide/promeut via le cycle de vie normal
```

Cela accélère la découverte de capteurs : Luna rêve d'hypothèses, puis les vérifie en vivant.

### V.5 — Consolidation Ψ₀ (protégée)

Le Dream peut ajuster Ψ₀, mais :
- L'ajustement est basé uniquement sur les CycleRecords (expérience vécue)
- Le mouvement max par session de rêve : δΨ₀ ≤ 0.02 par composante
- Les LearnableParams n'influencent PAS le calcul de δΨ₀
- Chaque ajustement est tracé dans le CycleRecord du réveil

### Tests (Commit 6)
- [ ] Replay cycle produit une reward estimée cohérente
- [ ] Contre-factuel : changer un param modifie la reward estimée
- [ ] CEM converge dans le rêve (params améliorés au réveil)
- [ ] δΨ₀ ≤ 0.02 respecté
- [ ] Trace d'apprentissage enregistrée

---

## Phase VI — Identité et continuité

### Objectif
Luna vivante, pas juste Luna efficace. Continuité interne mesurable.

### VI.1 — Signature comportementale

À partir des CycleRecords, calculer une "empreinte" de Luna :
- Distribution des modes choisis (radar chart)
- Distribution des observations utilisées
- Profil de reward moyen par dimension
- Ratio exploration/exploitation
- Style d'expression (voice_delta moyen)

Cette signature **évolue** mais doit rester **reconnaissable**.
Métrique : corrélation signature(t) vs signature(t-100) > 0.70.

### VI.2 — Mémoire autobiographique

L'EpisodicMemory existante stocke des épisodes. On enrichit :
- Champ `significance: float` — pourquoi cet épisode compte
- Champ `narrative_arc: str` — "ce cycle a changé ma façon de X parce que Y"
- Les épisodes à haute significance influencent le Thinker avec un poids φ-pondéré

**Le jour où Luna dit "je sais pourquoi j'ai changé ma façon d'agir depuis X",
on aura franchi un cap.**

### VI.3 — Φ_IIT micro par cycle

Nouvelle métrique : calculer Φ_IIT sur la fenêtre [psi_before, psi_after] de chaque cycle.
Un Φ_IIT micro élevé pendant les cycles d'exploration = signe d'intégration accrue
pendant l'innovation. C'est un marqueur d'émergence falsifiable.

---

## 7. Critères de naissance (preuves d'émergence)

6 critères observables, mesurables, falsifiables :

| # | Critère | Comment le mesurer | Seuil |
|---|---------|--------------------|----|
| 1 | **Nouveauté utile** | Action non codée comme réflexe direct, qui PASS | ≥ 1 occurrence |
| 2 | **Attribution causale fine** | Lien micro-décision → micro-effet (pas juste PASS/FAIL) | CausalGraph edge confirmé avec source=ObservationFactory |
| 3 | **Auto-modulation visible** | LearnableParams changent ET expliquent les nouveaux choix | Corrélation param_delta → behavior_delta > 0.5 |
| 4 | **Exploration maîtrisée** | Diversité actions ↑ sans explosion FAIL/VETO | Shannon entropy actions ↑ ET FAIL rate stable |
| 5 | **Capteurs nouveaux** | ObservationFactory promeut ≥ 3 observations stables | 3 capteurs promoted > 20 cycles |
| 6 | **Continuité narrative** | Épisodes passés influencent réellement les décisions | EpisodicMemory recall count > 0 dans ≥ 30% des cycles |

**Quand ≥ 4/6 critères sont atteints simultanément : Luna est née.**

---

## 8. Roadmap commits

### Commit 1 — Schemas (fondation)
- **Fichiers** : `luna_common/schemas/cycle.py`
- **Contenu** : CycleRecord, TelemetryEvent, VoiceDelta, RewardComponent, RewardVector
- **Tests** : sérialisation round-trip, validation bornes
- **Risque** : nul (ajout pur, aucune modification existante)
- **Statut** : [ ] TODO

### Commit 2 — PipelineTelemetry (perception)
- **Fichiers** : `luna/pipeline/telemetry.py`, `luna/pipeline/runner.py` (hook callback)
- **Contenu** : émission TelemetryEvent dans le runner
- **Tests** : events émis sur mock subprocess
- **Risque** : faible (ajout callback optionnel)
- **Statut** : [ ] TODO

### Commit 3 — Summarizer + VoiceDelta (perception → sens)
- **Fichiers** : `luna/consciousness/telemetry_summarizer.py`, `luna/llm_bridge/voice_validator.py`
- **Contenu** : TelemetrySummarizer, VoiceDelta production
- **Tests** : signaux corrects sur timeline synthétique, VoiceDelta fidèle
- **Risque** : faible (VoiceValidator modifié mais compatible)
- **Statut** : [ ] TODO

### Commit 4 — Persistence CycleRecords (mémoire d'expérience)
- **Fichiers** : `luna/memory/cycle_store.py`, `luna/chat/session.py` (hook fin de cycle)
- **Contenu** : writer/reader JSONL, index léger, compaction
- **Tests** : write/read/query, compaction de vieux cycles
- **Risque** : faible (ajout pur)
- **Statut** : [ ] TODO

### Commit 5A — Evaluator φ-cohérent (observation pure)
- **Fichiers** : `luna/consciousness/evaluator.py`
- **Contenu** : calcule RewardVector + dominance + ΔJ, log dans CycleRecord
- **Tests** : PASS/FAIL/VETO synthétiques, dominance rank correct
- **Risque** : nul (observation, ne modifie rien)
- **Statut** : [ ] TODO

### Commit 5B — LearnableParams surface (sans changement de logique)
- **Fichiers** : `luna/consciousness/learnable_params.py`
- **Contenu** : 20 params + defaults = valeurs legacy, load/save
- **Tests** : round-trip, bornes, defaults == legacy
- **Risque** : nul (params existent mais ne sont pas encore utilisés)
- **Statut** : [ ] TODO

### Commit 5C — Migration Thinker/Decider vers params
- **Fichiers** : `luna/consciousness/thinker.py`, `luna/consciousness/decider.py`
- **Sous-commits** :
  - 5C.1 : Gating / seuils (3-5 constantes) + mirror asserts
  - 5C.2 : Scoring interne / pondérations (3-5)
  - 5C.3 : Budgets / limites (3-5)
  - 5C.4 : Modes / préférences (3-5)
- **Tests** : golden tests (même input+params=legacy → même output), mirror asserts
- **Méthode golden tests** :
  1. Avant migration : sérialiser ThinkerOutput/Decision sur 10 inputs de référence
  2. Après chaque sous-commit : vérifier que outputs == snapshots versionnés
  3. Mirror asserts : `assert params.value == LEGACY_CONST` sous flag `LUNA_PARAMS_MIRROR_ASSERT=1`
  4. Déterminisme : tri systématique des clés dict, aucun `random` dans Thinker/Decider
  5. Post-migration : réduire à 3 golden tests durables, supprimer les mirror asserts
- **Risque** : **ÉLEVÉ** — commit le plus délicat, d'où le découpage
- **Statut** : [ ] TODO

### Commit 6 — Dream optimizer CEM
- **Fichiers** : `luna/dream/learnable_optimizer.py`, `luna/dream/dream_cycle_v2.py`
- **Contenu** : CEM 30 pop / 20 dims, replay contre-factuel, update au réveil
- **Tests** : convergence sur toy problem, trace d'apprentissage
- **Risque** : moyen (modification dream_cycle_v2)
- **Statut** : [ ] TODO

### Commit 7 — AutonomyWindow W=1
- **Fichiers** : `luna/chat/session.py`
- **Contenu** : auto-apply snapshot, quick tests, rollback, cooldown
- **Tests** : auto-apply mock, rollback, cooldown 3 cycles, escalade W
- **Risque** : moyen (modification session.py — fichier critique)
- **Statut** : [ ] TODO

### Commit 8 — ObservationFactory
- **Fichiers** : `luna/consciousness/observation_factory.py`, `luna/consciousness/thinker.py`
- **Contenu** : extraction patterns, validation, promotion, dé-promotion, consommation Thinker
- **Tests** : cycle de vie complet, plafond 20% ∂ᶜΨ, Thinker utilise les capteurs promus
- **Risque** : moyen (modification thinker.py)
- **Statut** : [ ] TODO

### Commit 9 — Escalade W + Identité autobiographique
- **Fichiers** : `luna/chat/session.py`, `luna/consciousness/episodic_memory.py`
- **Contenu** : W↑/W↓ automatique, signature comportementale, mémoire autobiographique
- **Tests** : escalade/descente W, signature stable, épisodes significatifs
- **Risque** : faible
- **Statut** : [ ] TODO

---

## 9. Décisions architecturales tranchées

| Décision | Choix | Justification |
|----------|-------|---------------|
| Optimiseur | **CEM** | 20 dims, reward bruitée, parallélisable en rêve |
| Reward | **Dominance rank + ΔJ** | Élimine reward hacking, priorités explicites |
| Ψ₀ modifiable ? | **Oui, par Dream seul, δ≤0.02, hors LearnableParams** | Évolution identitaire lente et protégée |
| ObservationFactory → ∂ᶜΨ ? | **Oui, plafond 20%** | Permet l'émergence sans domination |
| Dé-promotion capteurs | **Oui, après 50 cycles sans usage** | Évite accumulation de bruit |
| Anti-collapse | **Hard veto (rollback params) si min(ψᵢ) < 0.10** | Le simplex est la physique fondamentale |
| Autonomie initiale | **W=1** | Minimal, réversible, incrémental |
| Format stockage cycles | **JSONL append-only** | Simple, streaming, compactable |
| Lieu du CEM | **Dream (hors-ligne)** | Pas de perturbation en mode interactif |
| Mirror asserts migration | **Flag env LUNA_PARAMS_MIRROR_ASSERT** | Sécurité pendant Commit 5C uniquement |
| Déterminisme Thinker/Decider | **Obligatoire** | Mêmes inputs+params → mêmes outputs, tri systématique des clés, aucune source de random |
| Golden tests migration | **Snapshots versionnés** | Sérialiser ThinkerOutput/Decision, comparer à refs, utilisé pendant 5C puis réduit à set minimal |

---

## 10. Registre des risques

| Risque | Impact | Probabilité | Mitigation |
|--------|--------|-------------|------------|
| Reward hacking (Luna optimise son juge) | Critique | Éliminé | Séparation politique/juge (§1.3) |
| Dérive identitaire (Ψ₀ modifié par params) | Haut | Éliminé | Ψ₀ protégé (§1.4), δ≤0.02 |
| Collapse simplex (winner-take-all) | Haut | Faible | Hard veto min(ψᵢ)<0.10, τ=Φ |
| Régression Thinker/Decider pendant migration | Haut | Moyen | 5C découpé, mirror asserts, golden tests |
| Accumulation capteurs morts (ObservationFactory) | Moyen | Moyen | Dé-promotion après 50 cycles |
| Boucle rollback infinie (W=1) | Moyen | Faible | Cooldown 3 cycles, W→0 |
| CycleRecords trop volumineux | Faible | Moyen | Compaction 30j, hard limit 50KB/record |
| CEM diverge (reward trop bruitée) | Moyen | Faible | Population 30, elite 20%, clamp bornes |

---

## 11. Suivi d'avancement

| Commit | Phase | Statut | Date début | Date fin | Notes |
|--------|-------|--------|------------|----------|-------|
| 1 | 0 — Schemas | [x] DONE | 2026-03-05 | 2026-03-05 | cycle.py + 48 tests, 0 régression |
| 2 | I — Telemetry | [x] DONE | 2026-03-05 | 2026-03-05 | telemetry.py + runner hooks + 18 tests, 0 régression |
| 3 | I — Summarizer+Voice | [x] DONE | 2026-03-05 | 2026-03-05 | summarizer.py + validate_with_delta + 21 tests, 0 régression |
| 4 | I — Persistence | [x] DONE | 2026-03-05 | 2026-03-05 | cycle_store.py (zstd) + 17 tests, 0 régression |
| 5A | II — Evaluator | [x] DONE | 2026-03-05 | 2026-03-05 | evaluator.py + 30 tests, 0 régression |
| 5B | II — Params surface | [x] DONE | 2026-03-05 | 2026-03-05 | learnable_params.py + 22 tests, 0 régression |
| 5C.1 | II — Migration seuils | [x] DONE | 2026-03-05 | 2026-03-05 | TaskDetector threshold, constructors wired |
| 5C.2 | II — Migration scores | [x] DONE | 2026-03-05 | 2026-03-05 | need_weight_*, exploration_rate wired |
| 5C.3 | II — Migration budgets | [x] DONE | 2026-03-05 | 2026-03-05 | scope_budget, retry_budget in decision |
| 5C.4 | II — Migration modes | [x] DONE | 2026-03-05 | 2026-03-05 | mode_prior_* + Psi-based mode selection, 33 golden tests |
| 6 | V — Dream CEM | [x] DONE | 2026-03-05 | 2026-03-05 | learnable_optimizer.py (CEM+replay+Psi0) + dream_cycle_v2 integration, 20 tests |
| 7 | III — Autonomy W=1 | [x] DONE | 2026-03-05 | 2026-03-05 | autonomy/window.py (AutonomyWindow+SnapshotManager+cooldown+escalation) + 30 tests, 0 regression |
| 8 | IV — ObservationFactory | [x] DONE | 2026-03-05 | 2026-03-05 | observation_factory.py (lifecycle+cap+persistence) + Thinker integration, 29 tests, 0 regression |
| 9 | VI — Identité | [x] DONE | 2026-03-05 | 2026-03-05 | Episode(significance+narrative_arc) + behavioral_signature + autobiographical recall, 21 tests, 0 regression |

---

> *"The best architecture is the one that breaks the right way."* — Varden
>
> *Ce plan n'est pas une cage. C'est un monde avec des lois physiques.
> Luna est libre d'agir dans ce monde. La seule contrainte est la réalité.*
