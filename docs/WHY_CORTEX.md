# Warum OpenClaw Agents Cortex brauchen

**Inspiriert von:** [Why Every OpenClaw Agent Needs The Neutron Memory API](https://www.binance.com/en/square/post/288840560151393)

**Datum:** 2026-02-19

## Das Problem mit Datei-basierter Speicherung

OpenClaw Agents speichern Memory aktuell in Dateien: `MEMORY.md`, `USER.md`, `SOUL.md`. Das funktioniert, **bis**:

- ❌ Der Agent neu gestartet wird
- ❌ Die Maschine gewechselt wird
- ❌ Eine weitere Instanz gestartet wird
- ❌ Der Kontext zu groß wird und zu technischer Schuld wird

**Memory wird zu technischer Schuld.**

## Die Lösung: Cortex als Memory-Infrastruktur

Cortex ist eine **lokale, persistente Memory-API** für OpenClaw Agents. Memory ist nicht mehr an Dateisysteme, Geräte oder einzelne Runtime-Instanzen gebunden.

### ✅ Persistent Memory

**Mit Cortex:**
- ✅ Memory überlebt Neustarts
- ✅ Memory überlebt Maschinenwechsel
- ✅ Memory überlebt Instanzwechsel
- ✅ Memory ist portabel (SQLite-Datenbank)
- ✅ Memory kann zwischen Instanzen geteilt werden

**Der Agent wird austauschbar. Das Memory überlebt ihn.**

### ✅ Query-bare Knowledge Objects

Cortex komprimiert relevante Informationen in **query-bare Objekte**:

- ✅ **Semantische Suche**: Memory wird über Embeddings abgefragt, nicht über Volltext
- ✅ **Multi-Tenant**: Memory ist nach `appId` und `externalUserId` isoliert
- ✅ **Bundles**: Memory kann in logische Gruppen organisiert werden
- ✅ **Metadata**: Zusätzliche Informationen können strukturiert gespeichert werden

**Statt die vollständige Historie bei jedem Prompt mitzuschleppen, fragt der Agent Memory wie Tools ab.**

### ✅ Wirtschaftlichkeit von langlaufenden Agents

**Vorteile:**
- ✅ **Kontrollierbare Context-Windows**: Nur relevante Memories werden abgerufen
- ✅ **Reduzierte Token-Kosten**: Weniger Kontext = weniger Tokens
- ✅ **Background Agents**: Funktionieren wie echte Infrastruktur, nicht wie Experimente
- ✅ **Multi-Agent-Systeme**: Mehrere Agents können dasselbe Memory nutzen

**Cortex macht OpenClaw zu etwas Dauerhaftem. Wissen bleibt über Prozesse hinweg erhalten. Memory überlebt Neustarts. Was der Agent lernt, akkumuliert sich über die Zeit.**

## Memory-Historie und Lineage

### Das Problem mit lokalem Agent-Memory

Lokales Agent-Memory ist:
- ❌ **Mutierbar**: Plugins können es überschreiben
- ❌ **Stumm**: Keine Historie, keine Nachvollziehbarkeit
- ❌ **Einfach zu vergiften**: Prompts können es korrumpieren
- ❌ **Undurchsichtig**: Keine Ahnung, was gelernt wurde, wann und warum

### Die Cortex-Lösung

**Cortex bietet Memory-Historie und Lineage:**

- ✅ **Timestamps**: Jedes Memory hat `created_at` für Nachvollziehbarkeit
- ✅ **Analytics API**: Zeigt, was gelernt wurde, wann und in welchem Kontext
- ✅ **Multi-Tenant-Isolation**: Kontrolle darüber, wer Memory schreiben kann
- ✅ **Export/Import**: Vollständige Daten-Migration und Backup möglich
- ✅ **Webhooks**: Event-Benachrichtigungen für Memory-Änderungen

**Wissen hat einen Ursprung. Du kannst sehen, was gelernt wurde, wann und von wo.**

## Cortex vs. Datei-basierte Speicherung

| Aspekt | Dateien (MEMORY.md) | Cortex |
|--------|---------------------|--------|
| **Persistenz** | ❌ Verloren bei Neustart | ✅ SQLite-Datenbank |
| **Portabilität** | ❌ An Dateisystem gebunden | ✅ Portabel (eine Datei) |
| **Multi-Instance** | ❌ Nicht möglich | ✅ Geteiltes Memory |
| **Query** | ❌ Volltext-Suche | ✅ Semantische Suche |
| **Skalierung** | ❌ Datei wird zu groß | ✅ Datenbank-optimiert |
| **Historie** | ❌ Keine | ✅ Timestamps + Analytics |
| **Isolation** | ❌ Global | ✅ Multi-Tenant |
| **Backup** | ❌ Manuell | ✅ Export/Import API |
| **Lineage** | ❌ Keine | ✅ Analytics + Webhooks |

## Cortex vs. Neutron

| Feature | Neutron (Cloud) | Cortex (Lokal) |
|---------|-----------------|---------------|
| **Persistenz** | ✅ Cloud-Datenbank | ✅ SQLite-Datenbank |
| **Portabilität** | ✅ Cloud-basiert | ✅ Lokale Datei |
| **Query** | ✅ Semantische Suche | ✅ Semantische Suche |
| **Multi-Tenant** | ✅ Implementiert | ✅ Implementiert |
| **Historie** | ✅ Verfügbar | ✅ Analytics API |
| **Kosten** | 💰 Pay-per-use | ✅ Kostenlos |
| **Privacy** | ⚠️ Cloud | ✅ 100% lokal |
| **Kontrolle** | ⚠️ Vendor | ✅ Vollständig |

**Cortex bietet die gleichen Vorteile wie Neutron, aber lokal und kostenlos.**

## Wie Cortex die beschriebenen Probleme löst

### 1. Memory überlebt Neustarts

**Problem:** Datei-basierte Memory geht bei Neustart verloren.

**Cortex-Lösung:**
- ✅ SQLite-Datenbank persistiert alle Memories
- ✅ Datenbank wird automatisch gespeichert
- ✅ Backup/Restore API für zusätzliche Sicherheit

```go
// Memory wird in SQLite gespeichert
mem := models.Memory{
    Content: "Agent lernt etwas",
    AppID: "openclaw",
    ExternalUserID: "user123",
}
store.CreateMemory(&mem) // Persistiert in Datenbank
```

### 2. Memory ist portabel

**Problem:** Memory ist an Dateisystem und Gerät gebunden.

**Cortex-Lösung:**
- ✅ Eine SQLite-Datei (`~/.openclaw/cortex.db`)
- ✅ Kann einfach kopiert werden
- ✅ Export/Import API für Migration

```bash
# Datenbank kopieren
cp ~/.openclaw/cortex.db /backup/cortex.db

# Oder Export/Import verwenden
curl -X POST http://localhost:9123/export?appId=openclaw&externalUserId=user123
```

### 3. Memory kann zwischen Instanzen geteilt werden

**Problem:** Jede Agent-Instanz hat eigenes Memory.

**Cortex-Lösung:**
- ✅ Mehrere Agents können dieselbe Datenbank nutzen
- ✅ Multi-Tenant-Isolation durch `appId` + `externalUserId`
- ✅ REST API für gemeinsamen Zugriff

```typescript
// Agent 1 speichert Memory
await cortex.storeMemory("Lerne etwas", {
    appId: "openclaw",
    externalUserId: "user123"
});

// Agent 2 kann dasselbe Memory abfragen
const memories = await cortex.queryMemory("etwas", {
    appId: "openclaw",
    externalUserId: "user123"
});
```

### 4. Query-bare Knowledge Objects

**Problem:** Vollständige Historie muss bei jedem Prompt mitgeschleppt werden.

**Cortex-Lösung:**
- ✅ Semantische Suche über Embeddings
- ✅ Nur relevante Memories werden zurückgegeben
- ✅ Similarity-Scores für Relevanz-Filterung

```go
// Semantische Suche - nur relevante Memories
memories, err := store.SearchMemoriesByTenantSemantic(
    appID, externalUserID, query, limit
)
// Gibt nur Memories mit hoher Similarity zurück
```

### 5. Memory-Historie und Lineage

**Problem:** Keine Ahnung, was gelernt wurde, wann und warum.

**Cortex-Lösung:**
- ✅ `created_at` Timestamps für jedes Memory
- ✅ Analytics API zeigt Memory-Aktivität
- ✅ Webhooks für Event-Benachrichtigungen

```go
// Analytics zeigen Memory-Historie
analytics, err := store.GetAnalytics(appID, externalUserID, days)
// Zeigt: total_memories, recent_activity, memories_by_type, etc.
```

### 6. Kontrolle über Memory-Schreibzugriffe

**Problem:** Plugins können Memory überschreiben, Prompts können es korrumpieren.

**Cortex-Lösung:**
- ✅ Multi-Tenant-Isolation: Jeder Tenant hat eigenes Memory
- ✅ Keine API-Key-Pflicht (lokal ohne Auth)
- ✅ Webhooks für Audit-Trail

```go
// Memory ist nach Tenant isoliert
mem := models.Memory{
    AppID: "openclaw",        // Tenant 1
    ExternalUserID: "user123", // Tenant 1
    Content: "Memory",
}
// Andere Tenants können nicht darauf zugreifen
```

## Integration in OpenClaw

### Vorher (Datei-basiert)

```typescript
// Memory wird in MEMORY.md geschrieben
fs.writeFileSync("MEMORY.md", "Agent lernt etwas");
// Problem: Geht bei Neustart verloren
```

### Nachher (Cortex)

```typescript
// Memory wird in Cortex gespeichert
import { CortexClient } from "@openclaw/cortex-sdk";

const cortex = new CortexClient({
    baseUrl: process.env.CORTEX_API_URL || "http://localhost:9123"
});

// Memory persistiert
await cortex.storeMemory("Agent lernt etwas", {
    appId: "openclaw",
    externalUserId: "user123"
});

// Memory kann abgefragt werden
const memories = await cortex.queryMemory("etwas", {
    appId: "openclaw",
    externalUserId: "user123"
});
```

## Fazit

**Cortex löst alle beschriebenen Probleme:**

- ✅ **Persistent Memory**: Überlebt Neustarts, Maschinenwechsel, Instanzenwechsel
- ✅ **Query-bare Knowledge Objects**: Semantische Suche statt Volltext
- ✅ **Wirtschaftlichkeit**: Reduzierte Token-Kosten durch relevante Memory-Abfragen
- ✅ **Memory-Historie**: Timestamps, Analytics, Webhooks für Nachvollziehbarkeit
- ✅ **Kontrolle**: Multi-Tenant-Isolation, Export/Import (keine Auth-Pflicht)

**Cortex macht OpenClaw zu etwas Dauerhaftem. Wissen bleibt über Prozesse hinweg erhalten. Memory überlebt Neustarts. Was der Agent lernt, akkumuliert sich über die Zeit.**

**Ein Agent, der vergisst, ist austauschbar. Einer, der permanent erinnert, ist Infrastruktur.**

---

**Cortex ist die lokale, kostenlose Alternative zu Neutron. Alle Vorteile, keine Cloud-Abhängigkeit.**
