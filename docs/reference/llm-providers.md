# Fournisseurs LLM : état des lieux

Mis à jour le 2026-10-17. À re-vérifier à chaque changement de fournisseur (playbook `add-an-llm-provider.md`). Les faits viennent des pages publiques des fournisseurs ; les prix sont indicatifs.

| Fournisseur / modèle | Entrées | Contexte | Contenu adulte (politique) | Transparence IA exigée | Rôle envisagé | Notes |
|---|---|---|---|---|---|---|
| **xAI Grok 4.7** (`grok-4.7`, sorti le 2026-09-21) | texte, images jpg/png (20 Mio) ; **pas de vidéo** : aucun modèle de chat xAI n'en accepte par l'API (`modeles-ia/comparatif-modeles.md`, 17/10) | 500 k | non interdit entre adultes (AUP 2026-08-14) | **oui** | brain, voice, judge : **défaut** (décision de Charles, 17/10) ; sense : **bascule** de Gemini, en images clés + transcription | ~2 $/M entrée, 0,50 $/M en cache, 6 $/M sortie (sources tierces, à confirmer sur docs.x.ai). Test express : `pnpm probe`, `pnpm probe:vision`. Transcription xAI (`grok-voice-transcribe-2.0`) : 0,10 $ par heure d'audio. |
| xAI Grok 4.3 (GA 2026-05-06) | texte, images (pas de vidéo, comme 4.7) | 1 M | non interdit entre adultes (AUP 2026-08-14) | **oui** (« not being transparent regarding your use of AI » interdit) | voix moins chère, à évaluer | tarif annoncé ~1,25 $/M entrée, 2,50 $/M sortie (source tierce, à confirmer sur docs.x.ai). |
| **Mistral Large / Medium 3.5** | texte, images (Pixtral) | 128 k | politique muette (2026-06-11) | non précisé | brain, voice (challenger), judge | français natif, hébergement UE. Scores agrégés nettement sous Grok 4.20 : **challenger**, pas défaut. |
| **Venice** (open-weight hébergés, ex. Qwen3-VL 235B) | texte, images | variable | autorisé (roleplay adulte) | non | voice de repli (sans filtre), sense de repli | qualité du français à évaluer ; pas de vidéo native. |
| **Google Gemini 3.8 Flash** (`gemini-3.8-flash`, API Gemini, clé `LLM_GOOGLE_API_KEY`) ; Gemini 4 Argon (`gemini-4-argon`) à comparer | texte, images, **vidéo et son natifs** (20 Mo en ligne ; au-delà, images clés en attendant l'API Files) | 1 M | **interdit** « for sexual gratification » ; filtres réglés à `OFF`, refus occasionnels | — | **sense : défaut** (décision de Charles, 17/10 18h20, en connaissance de la politique) ; un refus bascule sur Grok 4.7 | 0,75 $/M entrée, 3,75 $/M sortie (Argon 2 $/10 $ jusqu'au 30/11, puis 4 $/20 $). Google conserve les requêtes payantes un temps limité contre les abus : les médias des fans transitent chez Google (registre RGPD). |
| **Anthropic Claude** | texte, images, PDF | 1 M | refuse l'explicite | — | hors runtime ; architecture et code (sessions Opus) | pas de vidéo native. |
| **OpenAI GPT** | texte, images, vidéo (selon modèle) | — | refuse l'explicite | — | hors runtime | — |
| Whisper / équivalent | audio | — | — | — | transcription des vocaux (sense audio) | si Grok ne couvre pas l'audio seul. |

## Ce que cela implique

- **Grok 4.7 d'abord** pour `brain` et `voice`, évalué en P3 ; Mistral comme challenger ; Venice comme repli sans filtre. **Vision : Gemini 3.8 Flash**, bascule automatique sur Grok 4.7 en images clés + transcription, puis Qwen3-VL (OpenRouter, pas encore branché). Taux de refus de Gemini mesuré par `pnpm probe:vision`, puis en production (journal des appels, `refused`).
- La contrainte de transparence de xAI est connue et acceptée par Charles (ADR 0012, redit le 17/10 : il prend le risque) ; elle motive un repli fonctionnel (Venice ou Mistral) prêt à prendre `voice` si xAI coupait l'accès.
- Pas de dépendance à un seul fournisseur : la passerelle (ADR 0009) et les évals rendent le changement peu coûteux.
