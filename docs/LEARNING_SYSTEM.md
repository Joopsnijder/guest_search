# Learning System Documentation

## Overzicht

De guest search agent heeft een lerend systeem dat automatisch verbetert op basis van eerdere zoeksessies. Het systeem verzamelt data over welke zoekopdrachten en bronnen succesvol zijn, en gebruikt deze informatie om betere strategieën te ontwikkelen.

## Hoe het werkt

### 1. Query Performance Tracking

Tijdens elke zoekfase wordt voor iedere uitgevoerde query het volgende bijgehouden:

- **Query tekst**: De exacte zoekopdracht
- **Rationale**: Waarom deze query werd uitgevoerd
- **Priority**: High/medium/low prioriteit
- **Candidates found**: Aantal kandidaten dat deze query opleverde
- **Successful sources**: URLs die succesvol waren (pagina's die kandidaten opleverden)
- **Timestamp**: Wanneer de query werd uitgevoerd

Deze informatie wordt opgeslagen in `data/search_history.json`.

### 2. Session Recording

Na elke volledige zoeksessie wordt een session record opgeslagen met:

- **Date**: Datum van de sessie
- **Week number**: Weeknummer
- **Total queries**: Aantal uitgevoerde queries
- **Total candidates**: Aantal gevonden kandidaten
- **Queries**: Lijst met alle query records (zie boven)

### 3. Learning Insights

Voordat de agent een nieuwe strategie maakt, analyseert het systeem de laatste 4 weken aan zoekgeschiedenis:

- **Top performing queries**: Welke queries vonden de meeste kandidaten?
- **Top sources**: Welke bronnen (websites) waren het meest productief?
- **Average performance**: Hoeveel kandidaten levert een query gemiddeld op?

Deze insights worden aan de agent gepresenteerd tijdens de planning fase.

### 4. Strategy Improvement

De agent gebruikt de learning insights om:

- **Succesvolle query-patronen** te herkennen en te herhalen
- **Productieve bronnen** te prioriteren
- **Ineffectieve benaderingen** te vermijden

## Data Structuur

### search_history.json

```json
{
  "sessions": [
    {
      "date": "2025-10-14T14:30:00",
      "week_number": 42,
      "total_queries": 8,
      "total_candidates": 12,
      "queries": [
        {
          "query": "AI Act implementatie Nederland bedrijven 2025",
          "rationale": "Focus op praktische implementatie in Nederlandse context",
          "priority": "high",
          "candidates_found": 3,
          "successful_sources": [
            "https://aic4nl.nl/evenement/ai-act-implementatie-congres/"
          ],
          "timestamp": "2025-10-14T14:32:15"
        }
      ]
    }
  ]
}
```

## Code Implementatie

### Belangrijkste functies

#### `_load_search_history()`
Laadt de search history bij het starten van de agent.

#### `_save_search_history()`
Bewaart de bijgewerkte search history naar disk.

#### `_get_learning_insights(weeks=4)`
Analyseert recente sessies en genereert insights:
- Filtert sessies uit de laatste N weken
- Sorteert queries op performance
- Telt source usage
- Berekent gemiddelden

#### Search Phase Tracking
Tijdens `run_search_phase()`:
- Track candidates voor elke query
- Registreer succesvolle sources (fetch_page_content met status="success")
- Bouw query records op

#### Planning Phase Integration
In `run_planning_phase()`:
- Haal learning insights op
- Format insights voor de prompt
- Geef agent expliciet instructie om te leren van het verleden

## Voordelen van het Learning System

1. **Efficiëntie**: Agent verspilt minder tijd aan queries die niet werken
2. **Consistentie**: Succesvolle strategieën worden herhaald
3. **Adaptatie**: Systeem past zich aan aan veranderende bronnen en trends
4. **Transparantie**: Alle data is inzichtelijk in JSON files

## Toekomstige Uitbreidingen

Het huidige systeem is niveau 1 (basis query tracking). Mogelijke uitbreidingen:

### Niveau 2: Strategy Reflection
- Agent schrijft reflecties over wat werkte/niet werkte
- Bewaar deze reflecties en gebruik ze in planning
- Meer semantisch begrip van succes-patronen

### Niveau 3: Adaptive Search
- Agent past strategie real-time aan tijdens zoeken
- Nieuwe tool: `adjust_search_strategy`
- Dynamische prioritering op basis van tussenresultaten

### Niveau 4: Cross-Session Learning
- Leer patronen over meerdere weken
- Seizoensgebonden trends herkennen
- Automatische A/B testing van strategieën

## Testing

De learning functionaliteit is gedekt door unit tests in `tests/test_learning.py`:

```bash
# Run learning tests
pytest tests/test_learning.py -v

# Run met coverage
pytest tests/test_learning.py --cov=src.guest_search.agent
```

Test coverage:
- ✅ Loading empty history
- ✅ Saving history to disk
- ✅ Getting insights from populated history
- ✅ Filtering old sessions
- ✅ Tracking query performance
- ✅ Top sources extraction

## Maintenance

### Data Cleanup

Om oude data op te schonen (optioneel):

```python
from datetime import datetime, timedelta
import json

# Bewaar alleen laatste 12 weken
with open("data/search_history.json") as f:
    data = json.load(f)

cutoff = datetime.now() - timedelta(weeks=12)
data["sessions"] = [
    s for s in data["sessions"]
    if datetime.fromisoformat(s["date"]) >= cutoff
]

with open("data/search_history.json", "w") as f:
    json.dump(data, f, indent=2)
```

### Manual Analysis

Je kunt de search history ook handmatig analyseren:

```python
from src.guest_search.agent import GuestFinderAgent

agent = GuestFinderAgent()
insights = agent._get_learning_insights(weeks=8)

print(f"Sessions analyzed: {insights['total_sessions']}")
print(f"Success rate: {insights['successful_queries']/insights['total_queries']:.1%}")

for query in insights['top_performing_queries'][:5]:
    print(f"- {query['query']}: {query['candidates_found']} candidates")
```

## Configuratie

Geen extra configuratie nodig. Het learning systeem werkt automatisch zodra je `guest_search.py` draait.

De enige relevante configuratie-opties:
- **Weeks to analyze**: Standaard 4 weken (aanpasbaar in `_get_learning_insights()`)
- **Top sources limit**: Standaard top 5 (zie `_get_learning_insights()`)
- **Top queries limit**: Standaard top 3 getoond in prompt (zie `run_planning_phase()`)

## Troubleshooting

### "Geen learning insights beschikbaar"
Dit is normaal bij de eerste run. Na 1 sessie wordt data verzameld.

### "search_history.json is corrupt"
Verwijder het bestand, het wordt automatisch opnieuw aangemaakt:
```bash
rm data/search_history.json
```

### "Agent lijkt niet te leren"
Controleer of insights correct worden doorgegeven:
1. Check `data/search_history.json` bevat sessions
2. Kijk in de terminal output tijdens planning fase - zou "🎓 Leergeschiedenis" sectie moeten tonen
3. Verhoog thinking budget als agent insights negeert

## Ethiek en Privacy

Het learning systeem verzamelt:
- ✅ Query teksten (geen persoonlijke data)
- ✅ URLs (publieke bronnen)
- ✅ Performance metrics (aantallen)

Het verzamelt NIET:
- ❌ Namen van kandidaten
- ❌ Contactgegevens
- ❌ AI model responses
- ❌ API keys of credentials

Alle data blijft lokaal in de `data/` directory.
