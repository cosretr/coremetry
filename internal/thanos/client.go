// Package thanos implements a read-only client for the Thanos
// Querier endpoints of external OpenShift clusters (v0.8.575,
// audit: docs/audit/thanos-multicluster-metrics-audit.md). It
// powers the /clusters surface: per-(namespace, pod) CPU + memory
// pulled straight from each cluster's platform monitoring stack —
// telemetry the applications themselves never emit.
//
// Structure mirrors internal/tempo/client.go (the canonical
// external-query-service template): typed Settings blob in
// system_settings under "thanos_clusters", narrow settingsStore
// interface, LoadPersisted at boot + StartConfigRefresh 30s poll
// for multi-pod sync, SavePersisted + live Configure swap, and a
// masked Snapshot for the settings UI. The one structural
// difference: Settings holds a LIST of clusters, and TLS-verify
// varies per cluster — so instead of tempo's rebuild-on-toggle
// single client, this package uses the Zoom two-singleton pattern
// (notify.go:1106): one verifying client + one lazily-built
// insecure twin, picked per request via thanosClientFor.
package thanos

import (
	"context"
	"crypto/tls"
	"encoding/json"
	"fmt"
	"github.com/cilcenk/coremetry/internal/secretref"
	"io"
	"log"
	"net/http"
	"net/url"
	"os"
	"sort"
	"strings"
	"sync"
	"time"
)

// ClusterConfig is one remote cluster entry. Name doubles as the
// APM join key: it must equal the cluster value spans carry
// (k8s.cluster.name / openshift.cluster.name — clusterDeriveExpr)
// for the service→cluster pivot to light up; the Settings UI
// suggests observed names for exactly that reason.
type ClusterConfig struct {
	// ID — v0.10.128: opak, DEĞİŞMEZ kimlik ("c-" + 8 hex). Entity
	// hiyerarşisinin kökü (cluster_identity.go); sunucu sahipli — PUT
	// istemciden gelen ID'yi ada göre saklı kayıttan alır, boşsa türetir.
	ID   string `json:"id,omitempty"`
	Name string `json:"name"`
	URL  string `json:"url"`
	// ThanosLabelName/Value — v0.10.128: TEK querier'ın önünde N cluster
	// varken seriyi bu cluster'a bağlayan external label. Ad BOŞ =
	// enjeksiyon yok = cluster başına URL modeli (eski davranış). Değer
	// boşsa Name.
	ThanosLabelName  string `json:"thanosLabelName,omitempty"`
	ThanosLabelValue string `json:"thanosLabelValue,omitempty"`
	// SpanClusterValue — v0.10.128: span `cluster` kolonunda bu cluster'ın
	// değeri; boşsa Name (bugünkü join anahtarı). v0.10.139'dan itibaren
	// LİSTENİN ilk elemanı (SpanClusterKeys) — eski kayıtlar okunmaya devam
	// eder, yazımda liste kanoniktir.
	SpanClusterValue string `json:"spanClusterValue,omitempty"`
	// SpanClusterValues — v0.10.139 (otomatik eşleme brief'i): bir kayıt
	// birden çok span cluster değeri taşır (geçiş dönemleri, farklı
	// Collector konfigürasyonları). Teklik: bir değer aynı anda TEK kayda
	// (ReconcileClusterSettings reddeder, bağlı kaydı söyler).
	SpanClusterValues []string `json:"spanClusterValues,omitempty"`
	// ThanosLabelSource — v0.10.139: "auto" (algılandı) | "manual" | "" (eski
	// kayıt = elle). Auto değer UI'da rozetlenir, elle geçersiz kılınabilir;
	// periyodik doğrulama eşleşmezse uyarı üretir, kaydı bozmaz.
	ThanosLabelSource     string `json:"thanosLabelSource,omitempty"`
	ThanosLabelDetectedAt int64  `json:"thanosLabelDetectedAt,omitempty"` // unix ms
	// AuthType — none | bearer. Bearer covers the standard
	// OpenShift path: a ServiceAccount token with the
	// cluster-monitoring-view ClusterRole against the
	// oauth-proxy'd thanos-querier route.
	AuthType string `json:"authType,omitempty"`
	// Token — never echoed; Snapshot exposes HasToken only.
	Token string `json:"token,omitempty"`
	// TokenRef — v0.10.272: `env:NAME` | `file:/path` (internal/secretref);
	// doluysa saklı Token'a TERCİH edilir. Çözüm Configure'da (boot / PUT /
	// 30 s yenileme), istekte IO yok; file rotasyonu ≤30 s.
	TokenRef string `json:"tokenRef,omitempty"`
	// NamespaceFilter is a PromQL regex injected as
	// namespace=~"..." into every query — the cardinality shield
	// that keeps a 10k-pod estate from riding home in one
	// response. Empty = all namespaces (topk still caps rows).
	NamespaceFilter    string `json:"namespaceFilter,omitempty"`
	InsecureSkipVerify bool   `json:"insecureSkipVerify,omitempty"`
	Enabled            bool   `json:"enabled"`
	// v0.10.956 — Rollouts v2 P1.3 (docs/rollouts/v2-audit.md §3.2, karar 7).
	// Üçü de EK ve omitempty: alan bilmeyen eski pod blobu aynı okur. P1'de
	// okuyucu yok; P3 Argo eşleyicisi kullanacak.
	//
	// APIServerURLs — bu cluster'ın Kubernetes API server adresleri (Argo
	// `dest_server` yazımları kayıttan kayda değiştiği için LİSTE;
	// SpanClusterValue → SpanClusterValues dersinin aynısı). Kanonik biçimde
	// saklanır (NormalizeAPIServerURL); cluster'lar arası tekil.
	APIServerURLs []string `json:"apiServerUrls,omitempty"`
	// ArgoSuffix — Argo uygulama adının son parçası
	// (<prefix>-<team>-<component>-<env>-<suffix>, audit §6); cluster başına
	// TEK, cluster'lar arası tekil (büyük/küçük harf duyarsız).
	ArgoSuffix string `json:"argoSuffix,omitempty"`
	// PairGroup — aktif-aktif çiftin ortak anahtarı; serbest metin, paylaşımlı.
	PairGroup string `json:"pairGroup,omitempty"`
}

// Settings is the persisted blob: the whole cluster list, written
// atomically (custom_roles convention — no per-row races at the
// realistic N≤20 scale).
type Settings struct {
	Clusters []ClusterConfig `json:"clusters"`
}

// ClusterSnapshot mirrors ClusterConfig with the token masked.
type ClusterSnapshot struct {
	ID                    string   `json:"id,omitempty"`
	Name                  string   `json:"name"`
	URL                   string   `json:"url"`
	ThanosLabelName       string   `json:"thanosLabelName,omitempty"`
	ThanosLabelValue      string   `json:"thanosLabelValue,omitempty"`
	SpanClusterValue      string   `json:"spanClusterValue,omitempty"`
	SpanClusterValues     []string `json:"spanClusterValues,omitempty"`
	ThanosLabelSource     string   `json:"thanosLabelSource,omitempty"`
	ThanosLabelDetectedAt int64    `json:"thanosLabelDetectedAt,omitempty"`
	// LabelCheck — v0.10.140: periyodik doğrulama sonucu (bellek; auto
	// etiketli kayıtlar). nil = henüz denetlenmedi.
	LabelCheck *LabelCheck `json:"labelCheck,omitempty"`
	AuthType   string      `json:"authType,omitempty"`
	HasToken   bool        `json:"hasToken"`
	// v0.10.272 — referans görünür (secret değil); çözüm durumu rozet.
	TokenRef           string `json:"tokenRef,omitempty"`
	TokenResolved      bool   `json:"tokenResolved"`
	TokenError         string `json:"tokenError,omitempty"`
	NamespaceFilter    string `json:"namespaceFilter,omitempty"`
	InsecureSkipVerify bool   `json:"insecureSkipVerify,omitempty"`
	Enabled            bool   `json:"enabled"`
	// v0.10.956 — Rollouts v2 P1.3. apiServerUrls BİLEREK omitempty DEĞİL ve
	// hiç nil değil: GET → PUT gidiş-dönüşünde anahtar hep bulunur, sunucu
	// gövdeyi "alanları bilen istemci" sayar (ReconcileClusterSettings) —
	// boş liste temizlemedir, eksik anahtar saklı değeri korur.
	APIServerURLs []string `json:"apiServerUrls"`
	ArgoSuffix    string   `json:"argoSuffix,omitempty"`
	PairGroup     string   `json:"pairGroup,omitempty"`
}

// Snapshot is what GET /api/settings/thanos returns.
type Snapshot struct {
	Clusters []ClusterSnapshot `json:"clusters"`
}

// PodRow is one (cluster, namespace, pod) sample from the merged
// instant queries. CPU is CORES (rate of cpu-seconds), not the
// 0-1 utilization ratio HostRow carries — deliberately a separate
// shape (audit §7). Pct fields are 0 when the cluster doesn't
// expose kube-state-metrics limits — same "0 = unknown" contract
// HostRow.MemPct already established.
type PodRow struct {
	Cluster   string  `json:"cluster"`
	Namespace string  `json:"namespace"`
	Pod       string  `json:"pod"`
	CPUCores  float64 `json:"cpuCores"`
	MemBytes  float64 `json:"memBytes"`
	CPUPct    float64 `json:"cpuPct,omitempty"`
	MemPct    float64 `json:"memPct,omitempty"`
	// Request-based percentages (v0.8.580) — provisioning accuracy
	// axis, alongside the limit-based throttle/OOM axis above. Can
	// legitimately exceed 100 (pod using more than it requested) —
	// deliberately NOT clamped like the limit pcts; the overshoot
	// IS the signal. 0 = requests not exposed (best-effort).
	CPUPctOfReq float64 `json:"cpuPctOfReq,omitempty"`
	MemPctOfReq float64 `json:"memPctOfReq,omitempty"`
	// Ham limit/request değerleri (v0.9.3, trend-upgrade audit §1
	// düzeltmesi): threshold referans ÇİZGİLERİ mutlak değer ister
	// (cores/bytes ekseninde) — yüzdeler yetmez. acc'ta zaten
	// vardı, satıra indirildi; 0 = bilinmiyor.
	CPULimitCores   float64 `json:"cpuLimitCores,omitempty"`
	MemLimitBytes   float64 `json:"memLimitBytes,omitempty"`
	CPURequestCores float64 `json:"cpuRequestCores,omitempty"`
	MemRequestBytes float64 `json:"memRequestBytes,omitempty"`
	// v0.9.9 — pod network hızı (cAdvisor, best-effort).
	NetInBps  float64 `json:"netInBps,omitempty"`
	NetOutBps float64 `json:"netOutBps,omitempty"`
	// Service (v0.9.11) — Coremetry servis eşleşmesi (host_name =
	// pod adı köprüsü). API katmanı doldurur (chstore.PodServiceMap
	// + pickPodService); thanos paketi bu alana yazmaz. Boş =
	// eşleşme yok (instrument edilmemiş / infra pod'u / belirsiz).
	Service string `json:"service,omitempty"`
	// v0.9.37 (B4) — faz + restart (Pods tab Status/Restarts).
	// Best-effort: kube-state-metrics yoksa Phase="" / Restarts=0.
	// v0.9.371 — Restarts'ta omitempty YOK artık: gerçek 0 wire'da
	// görünür (Clusters sayfası 0'ı '—' çiziyordu). Bilinmezlik ayrı
	// bayrak: restart SERİSİ hiç gelmediyse (KSM yok ya da 1000-seri
	// parse tavanı) RestartsUnknown=true — 0 sağlıklıymış gibi değil,
	// '—' bilinmiyor gibi çizilir. Üyelik = bilgi: KSM 0 restart'lı
	// pod için de seri döndürür.
	Phase           string `json:"phase,omitempty"`
	Restarts        int    `json:"restarts"`
	RestartsUnknown bool   `json:"restartsUnknown,omitempty"`
	// v0.9.1276 (Dynatrace-parite #5) — son sonlanma sebebi
	// (kube_pod_container_status_last_terminated_reason), pod
	// satırında rozet. Boş = hiç sonlanmamış YA DA KSM yok:
	// RestartsUnknown'dan BAĞIMSIZ best-effort — restart sayısı
	// bilinirken sebep bilinmeyebilir (ve tersi). Pod'un birden çok
	// container'ı farklı sebep taşıyabilir; satıra en kötüsü çıkar
	// (worseTermReason).
	LastTermReason string `json:"lastTermReason,omitempty"`
}

// termReasonRank — son-sonlanma sebeplerinin kötülük sırası
// (v0.9.1276). Whitelist DEĞİL bilerek: KSM yeni bir sebep adı
// basmaya başlarsa (ya da bir dağıtım kendi adını kullanırsa) o ad
// "diğer hata" sınıfına düşer — sessizce kaybolmaz.
//
//	3 OOMKilled — operatörün aradığı sinyal, her şeyi ezer
//	2 diğer hata — Error, ContainerCannotRun, StartError,
//	  DeadlineExceeded, Evicted… + BİLİNMEYEN her ad
//	1 Completed  — normal çıkış, hata değil
//	0 ""         — sebep yok
func termReasonRank(reason string) int {
	switch reason {
	case "":
		return 0
	case "Completed":
		return 1
	case "OOMKilled":
		return 3
	default:
		return 2
	}
}

// worseTermReason — aynı pod'un iki container'ının sonlanma
// sebebinden satırda gösterileceni seçer: kötü olan kazanır. Eşit
// rütbede sözlük sırası belirler; Prometheus seri sırası (ve map
// gezinme sırası) rastgeledir, satırın kararlı olması gerekir.
// Saf; tablo-testli (client_test.go, v0.9.1276).
func worseTermReason(a, b string) string {
	ra, rb := termReasonRank(a), termReasonRank(b)
	switch {
	case ra > rb:
		return a
	case rb > ra:
		return b
	case b < a:
		return b
	default:
		return a
	}
}

// PodSeriesTrend — multi-pod görünümün seri birimi (v0.9.3): bir
// pod'un dakika-bucket trendi.
type PodSeriesTrend struct {
	Pod   string       `json:"pod"`
	Trend []TrendPoint `json:"trend"`
}

// TrendPoint matches HostTrendPoint's bucket contract: unix
// SECONDS on minute boundaries, so the frontend drawer reuses the
// same rendering path.
type TrendPoint struct {
	Bucket   int64   `json:"bucket"`
	CPUCores float64 `json:"cpuCores"`
	MemBytes float64 `json:"memBytes"`
}

// Service holds the live cluster list. Concurrency contract is
// tempo's: RWMutex around the config, background refresh poll
// keeping multi-pod deployments in sync via the shared blob.
type Service struct {
	labelCheckState // v0.10.140 — periyodik etiket doğrulama sonuçları
	mu              sync.RWMutex
	cfg             Settings
	// v0.10.272 — tokenRef çözümü (Configure'da), küme id'sine göre;
	// testler getenv/readFile enjekte eder (influx/tempo deseni).
	resolvedTokens map[string]string
	resolveErrs    map[string]string
	getenv         func(string) string
	readFile       func(string) ([]byte, error)
}

func New() *Service { return &Service{getenv: os.Getenv, readFile: os.ReadFile} }

// settingsStore — narrow chstore surface (tempo precedent; avoids
// an import cycle if chstore ever depends back on thanos).
type settingsStore interface {
	GetThanosSettingsRaw(ctx context.Context) ([]byte, error)
	PutThanosSettingsRaw(ctx context.Context, raw []byte) error
}

// LoadPersisted hydrates from system_settings. Missing blob =
// empty list (HasEnabledClusters reports false; handlers 404).
func (s *Service) LoadPersisted(ctx context.Context, store settingsStore) error {
	if s == nil || store == nil {
		return nil
	}
	raw, err := store.GetThanosSettingsRaw(ctx)
	if err != nil {
		return err
	}
	if len(raw) == 0 {
		return nil
	}
	var cfg Settings
	if err := json.Unmarshal(raw, &cfg); err != nil {
		return fmt.Errorf("thanos decode: %w", err)
	}
	// v0.10.128 — geriye dönük id doldurma: boş ID'ler Name'den türetilir
	// ve bloba BİR KEZ yazılır. Türetim deterministik; çok-pod yarışı
	// zararsız (aynı değer). Yazım hatası boot'u durdurmaz — bellekte
	// türetilmiş id yine kullanılır (EffectiveID), sonraki boot dener.
	if filled, changed := BackfillClusterIDs(cfg); changed {
		if err := s.SavePersisted(ctx, store, filled); err != nil {
			log.Printf("[thanos] cluster id geriye doldurma yazılamadı (%v) — bellekte türetilmiş id ile devam", err)
			s.Configure(cfg)
		}
		return nil
	}
	s.Configure(cfg)
	return nil
}

// StartConfigRefresh — multi-pod blob sync, 30s default (tempo
// v0.5.324 precedent). Run as a goroutine from main().
func (s *Service) StartConfigRefresh(ctx context.Context, store settingsStore, interval time.Duration) {
	if s == nil || store == nil {
		return
	}
	if interval <= 0 {
		interval = 30 * time.Second
	}
	t := time.NewTicker(interval)
	defer t.Stop()
	for {
		select {
		case <-ctx.Done():
			return
		case <-t.C:
			if err := s.LoadPersisted(ctx, store); err != nil {
				log.Printf("[thanos] config refresh: %v", err)
			}
		}
	}
}

// SavePersisted writes the merged config (handler does the
// empty-token-preserves-stored merge first) and swaps it live.
func (s *Service) SavePersisted(ctx context.Context, store settingsStore, cfg Settings) error {
	if s == nil || store == nil {
		return nil
	}
	// v0.10.272 — düz token blob'a referans kılığında GİRMEZ.
	for _, c := range cfg.Clusters {
		if c.TokenRef != "" && !secretref.Valid(c.TokenRef) {
			return fmt.Errorf("cluster %s: %s", c.Name, secretref.InvalidMessage)
		}
	}
	raw, err := json.Marshal(cfg)
	if err != nil {
		return err
	}
	if err := store.PutThanosSettingsRaw(ctx, raw); err != nil {
		return err
	}
	s.Configure(cfg)
	return nil
}

// Configure swaps the live cluster list.
func (s *Service) Configure(cfg Settings) {
	if s == nil {
		return
	}
	s.mu.Lock()
	s.cfg = cfg
	// v0.10.272 — referanslar burada çözülür (boot / PUT / 30 s yenileme).
	s.resolvedTokens, s.resolveErrs = map[string]string{}, map[string]string{}
	getenv, readFile := s.getenv, s.readFile
	if getenv == nil {
		getenv = os.Getenv
	}
	if readFile == nil {
		readFile = os.ReadFile
	}
	for _, c := range cfg.Clusters {
		if c.TokenRef == "" {
			continue
		}
		id := c.EffectiveID()
		if v, err := secretref.ResolveWith(c.TokenRef, getenv, readFile); err != nil {
			s.resolveErrs[id] = err.Error()
		} else {
			s.resolvedTokens[id] = v
		}
	}
	s.mu.Unlock()
}

// effectiveToken — v0.10.272: ref doluysa çözülmüş değer (çözülemediyse
// BOŞ — saklı token'a sessizce düşülmez), yoksa saklı düz token. SAF.
func effectiveToken(c ClusterConfig, resolved string) string {
	if c.TokenRef != "" {
		return resolved
	}
	return c.Token
}

// effectiveTokenFor — kilitli okuma (istek yolu).
func (s *Service) effectiveTokenFor(c ClusterConfig) string {
	if s == nil {
		return c.Token
	}
	s.mu.RLock()
	defer s.mu.RUnlock()
	return effectiveToken(c, s.resolvedTokens[c.EffectiveID()])
}

// Snapshot returns the masked config for the settings UI.
func (s *Service) Snapshot() Snapshot {
	if s == nil {
		return Snapshot{}
	}
	s.mu.RLock()
	defer s.mu.RUnlock()
	out := Snapshot{Clusters: make([]ClusterSnapshot, 0, len(s.cfg.Clusters))}
	for _, c := range s.cfg.Clusters {
		out.Clusters = append(out.Clusters, ClusterSnapshot{
			ID: c.EffectiveID(), Name: c.Name, URL: c.URL, AuthType: c.AuthType,
			ThanosLabelName: c.ThanosLabelName, ThanosLabelValue: c.ThanosLabelValue,
			ThanosLabelSource: c.ThanosLabelSource, ThanosLabelDetectedAt: c.ThanosLabelDetectedAt,
			SpanClusterValue: c.SpanClusterValue, SpanClusterValues: c.ExplicitSpanClusterValues(),
			LabelCheck: s.labelCheckFor(c.EffectiveID()),
			HasToken:   c.Token != "", NamespaceFilter: c.NamespaceFilter,
			TokenRef: c.TokenRef, TokenResolved: c.TokenRef != "" && s.resolvedTokens[c.EffectiveID()] != "",
			TokenError:         s.resolveErrs[c.EffectiveID()],
			InsecureSkipVerify: c.InsecureSkipVerify, Enabled: c.Enabled,
			// v0.10.956 — kopya (append(nil...) değil: boşken de [] kalsın).
			APIServerURLs: append(make([]string, 0, len(c.APIServerURLs)), c.APIServerURLs...),
			ArgoSuffix:    c.ArgoSuffix, PairGroup: c.PairGroup,
		})
	}
	return out
}

// CurrentSettings — full config INCLUDING tokens; only for the
// PUT handler's stored-token merge. Never echo over the wire
// (tempo contract).
func (s *Service) CurrentSettings() Settings {
	if s == nil {
		return Settings{}
	}
	s.mu.RLock()
	defer s.mu.RUnlock()
	cp := Settings{Clusters: make([]ClusterConfig, len(s.cfg.Clusters))}
	copy(cp.Clusters, s.cfg.Clusters)
	return cp
}

// ClusterByName returns the ENABLED cluster entry for name.
func (s *Service) ClusterByName(name string) (ClusterConfig, bool) {
	if s == nil {
		return ClusterConfig{}, false
	}
	s.mu.RLock()
	defer s.mu.RUnlock()
	for _, c := range s.cfg.Clusters {
		if c.Enabled && c.Name == name {
			return c, true
		}
	}
	return ClusterConfig{}, false
}

// HasEnabledClusters gates the /clusters surface: false → the
// page shows its Empty state without any HTTP attempts.
func (s *Service) HasEnabledClusters() bool {
	if s == nil {
		return false
	}
	s.mu.RLock()
	defer s.mu.RUnlock()
	for _, c := range s.cfg.Clusters {
		if c.Enabled {
			return true
		}
	}
	return false
}

// ── HTTP transport — Zoom two-singleton pattern ─────────────────

// thanosHTTPClient is the default verifying client. 15s hard
// timeout (Zoom precedent): a wedged Querier must never pin a
// serveCached singleflight slot indefinitely — handlers also pass
// a tighter per-query ctx deadline on top.
var thanosHTTPClient = &http.Client{Timeout: 15 * time.Second}

var (
	thanosInsecureOnce   sync.Once
	thanosInsecureClient *http.Client
)

// thanosClientFor picks the verifying or the lazily-built
// insecure client. Per-cluster TLS variance is a single bool, so
// two shared clients cover every cluster (Zoom proof); building a
// client per cluster would just fragment connection pools.
func thanosClientFor(skipVerify bool) *http.Client {
	if !skipVerify {
		return thanosHTTPClient
	}
	thanosInsecureOnce.Do(func() {
		thanosInsecureClient = &http.Client{
			Timeout: 15 * time.Second,
			Transport: &http.Transport{
				TLSClientConfig: &tls.Config{InsecureSkipVerify: true},
			},
		}
	})
	return thanosInsecureClient
}

// ── Prometheus query API ────────────────────────────────────────

// promEnvelope is the /api/v1/query(_range) response shape. On
// status!="success" Prometheus fills errorType/error instead of
// data.
type promEnvelope struct {
	Status    string `json:"status"`
	ErrorType string `json:"errorType"`
	Error     string `json:"error"`
	Data      struct {
		ResultType string       `json:"resultType"`
		Result     []promSeries `json:"result"`
	} `json:"data"`
}

// promSeries — instant vectors fill Value ([ts, "v"]), range
// matrices fill Values. Sample values arrive as STRINGS per the
// Prometheus JSON contract.
type promSeries struct {
	Metric map[string]string   `json:"metric"`
	Value  []json.RawMessage   `json:"value"`
	Values [][]json.RawMessage `json:"values"`
}

// maxSeriesParsed is the defensive backstop behind the query-side
// topk cap: even a misbehaving Querier can't hand us more rows
// than this.
const maxSeriesParsed = 1000

func (s *Service) doQuery(ctx context.Context, c ClusterConfig, path string, params url.Values) ([]promSeries, error) {
	return s.doQueryWith(ctx, c, path, params, true)
}

// doQueryRaw — v0.10.140: matcher ENJEKSİYONSUZ sorgu. Tek kullanım yeri
// etiket algılama (cluster_detect.go): "hangi etiket cluster'ı ayırıyor"
// sorusu, cevabı sorunun içine gömmeden sorulmalı. Diğer her sorgu
// doQuery'den (enjeksiyonlu) geçer — görev kısıtı değişmedi.
func (s *Service) doQueryRaw(ctx context.Context, c ClusterConfig, path string, params url.Values) ([]promSeries, error) {
	return s.doQueryWith(ctx, c, path, params, false)
}

func (s *Service) doQueryWith(ctx context.Context, c ClusterConfig, path string, params url.Values, inject bool) ([]promSeries, error) {
	// v0.10.128 — cluster matcher enjeksiyonu (cluster_matcher.go): tek
	// querier'da her seçici <label>="<value>" taşır; etiket adı boşsa
	// ifade aynen gider.
	if label, value := c.EffectiveThanosLabel(); inject && label != "" {
		if q := params.Get("query"); q != "" {
			params = cloneValues(params)
			params.Set("query", withClusterMatcher(q, label, value))
		}
	}
	// v0.10.531 — tavan 30g (api.thanosMaxWindow): geniş pencerede ham
	// blok taraması yerine downsample'lı blok. `auto` = step/5: ≤24h'te
	// (step ≤300s) yine ham, 7g/30g'de 5 dk blok — varsa; yoksa Thanos
	// ham bloğa düşer, Prometheus parametreyi yok sayar. Çağıran açıkça
	// verdiyse dokunulmaz; anlık /query'ye eklenmez (step yok).
	if path == "/api/v1/query_range" && params.Get("max_source_resolution") == "" {
		params = cloneValues(params)
		params.Set("max_source_resolution", "auto")
	}
	u := strings.TrimRight(c.URL, "/") + path + "?" + params.Encode()
	req, err := http.NewRequestWithContext(ctx, http.MethodGet, u, nil)
	if err != nil {
		return nil, err
	}
	req.Header.Set("Accept", "application/json")
	if token := s.effectiveTokenFor(c); c.AuthType == "bearer" && token != "" { // v0.10.272 — ref > saklı
		req.Header.Set("Authorization", "Bearer "+token)
	}
	resp, err := thanosClientFor(c.InsecureSkipVerify).Do(req)
	if err != nil {
		return nil, fmt.Errorf("thanos %s: %w", c.Name, err)
	}
	defer resp.Body.Close()
	// 8MB cap — a topk(500) vector is a few hundred KB; anything
	// bigger means the cardinality shield failed upstream.
	body, _ := io.ReadAll(io.LimitReader(resp.Body, 8<<20))
	if resp.StatusCode >= 300 {
		return nil, fmt.Errorf("thanos %s: HTTP %d: %s", c.Name, resp.StatusCode,
			strings.TrimSpace(firstN(string(body), 200)))
	}
	var env promEnvelope
	if err := json.Unmarshal(body, &env); err != nil {
		return nil, fmt.Errorf("thanos %s decode: %w", c.Name, err)
	}
	if env.Status != "success" {
		return nil, fmt.Errorf("thanos %s: %s: %s", c.Name, env.ErrorType, env.Error)
	}
	if len(env.Data.Result) > maxSeriesParsed {
		env.Data.Result = env.Data.Result[:maxSeriesParsed]
	}
	return env.Data.Result, nil
}

// cloneValues — params çağıranın; enjeksiyon kopyada yapılır.
func cloneValues(v url.Values) url.Values {
	out := make(url.Values, len(v))
	for k, vs := range v {
		out[k] = append([]string(nil), vs...)
	}
	return out
}

func firstN(s string, n int) string {
	if len(s) <= n {
		return s
	}
	return s[:n] + "…"
}

// PodMetrics runs the per-cluster instant queries (CPU rate,
// working-set memory, cpu/mem limits) and merges them by
// (namespace, pod). Exactly four queries per cluster regardless
// of pod count — never a query per pod (audit §4).
// PodMetrics'in ikinci dönüşü truncated: cpu/mem serilerinden biri
// podListLimit tavanına DAYANDIYSA liste cluster'ın tamamı değildir —
// düşük trafikli pod'lar topk dışında kalmıştır. v0.9.369: bu bayrak
// olmadan 3000-pod'luk cluster'da sakin bir servisin sekmesi kendinden
// emin "Pods (0)" diyordu; süzme istemcide, kesme sunucuda ve İFŞASIZDI.
// podRe — v0.9.536: boş = tüm cluster (eski davranış, /clusters sayfası);
// dolu = hedefli seçici pod=~"<re>" (servis sekmeleri). Hedefli modda
// topk(500) servisin KENDİ pod'ları içinde işler — düşük trafikli pod
// cluster-geneli kesime takılmaz (operator-reported: BFF pod'ları
// 0.001 core'da top-500'e giremiyordu, "No pods matched").
func (s *Service) PodMetrics(ctx context.Context, c ClusterConfig, podRe string) ([]PodRow, bool, error) {
	type acc struct{ cpu, mem, cpuLim, memLim, cpuReq, memReq, netIn, netOut float64 }
	byKey := map[string]*acc{}
	get := func(m map[string]string) *acc {
		k := m["namespace"] + "\x00" + m["pod"]
		a := byKey[k]
		if a == nil {
			a = &acc{}
			byKey[k] = a
		}
		return a
	}

	// CPU + memory are mandatory; limits are best-effort (clusters
	// without kube-state-metrics simply leave Pct at 0 — the
	// HostRow.MemPct contract).
	cpuSeries, err := s.doQuery(ctx, c, "/api/v1/query",
		url.Values{"query": {podCPUQuery(c.NamespaceFilter, podRe)}})
	if err != nil {
		return nil, false, err
	}
	memSeries, err := s.doQuery(ctx, c, "/api/v1/query",
		url.Values{"query": {podMemQuery(c.NamespaceFilter, podRe)}})
	if err != nil {
		return nil, false, err
	}
	truncated := len(cpuSeries) >= podListLimit || len(memSeries) >= podListLimit
	for _, ser := range cpuSeries {
		if v, ok := sampleValue(ser.Value); ok {
			get(ser.Metric).cpu = v
		}
	}
	for _, ser := range memSeries {
		if v, ok := sampleValue(ser.Value); ok {
			get(ser.Metric).mem = v
		}
	}
	for _, lim := range []struct {
		query string
		set   func(*acc, float64)
	}{
		{podLimitQuery("cpu", c.NamespaceFilter, podRe), func(a *acc, v float64) { a.cpuLim = v }},
		{podLimitQuery("memory", c.NamespaceFilter, podRe), func(a *acc, v float64) { a.memLim = v }},
		// v0.8.580 — request axis, same best-effort contract:
		// cluster başına sabit 6 sorgu, hâlâ pod sayısından bağımsız.
		{podRequestQuery("cpu", c.NamespaceFilter, podRe), func(a *acc, v float64) { a.cpuReq = v }},
		{podRequestQuery("memory", c.NamespaceFilter, podRe), func(a *acc, v float64) { a.memReq = v }},
		// v0.9.9 — network (best-effort; cluster başına sabit 8 sorgu oldu).
		{podNetQuery("receive", c.NamespaceFilter, podRe), func(a *acc, v float64) { a.netIn = v }},
		{podNetQuery("transmit", c.NamespaceFilter, podRe), func(a *acc, v float64) { a.netOut = v }},
	} {
		series, err := s.doQuery(ctx, c, "/api/v1/query", url.Values{"query": {lim.query}})
		if err != nil {
			continue // best-effort — limits absent on many stacks
		}
		for _, ser := range series {
			if v, ok := sampleValue(ser.Value); ok {
				lim.set(get(ser.Metric), v)
			}
		}
	}

	// v0.9.37 — best-effort faz + restart eşlemeleri.
	phaseBy := map[string]string{}
	if series, err := s.doQuery(ctx, c, "/api/v1/query", url.Values{"query": {podPhaseQuery(c.NamespaceFilter, podRe)}}); err == nil {
		for _, ser := range series {
			if ser.Metric["phase"] != "" {
				phaseBy[ser.Metric["namespace"]+"\x00"+ser.Metric["pod"]] = ser.Metric["phase"]
			}
		}
	}
	restartBy := map[string]int{}
	if series, err := s.doQuery(ctx, c, "/api/v1/query", url.Values{"query": {podRestartsQuery(c.NamespaceFilter, podRe)}}); err == nil {
		for _, ser := range series {
			if v, ok := sampleValue(ser.Value); ok {
				restartBy[ser.Metric["namespace"]+"\x00"+ser.Metric["pod"]] = int(v)
			}
		}
	}

	// v0.9.1276 — son sonlanma sebebi (best-effort, restart eşlemesinin
	// birebiri). KSM container başına seri basar: aynı pod'un iki
	// container'ı farklı sebep taşıyabilir, satıra en kötüsü çıkar.
	reasonBy := map[string]string{}
	if series, err := s.doQuery(ctx, c, "/api/v1/query", url.Values{"query": {podLastTermQuery(c.NamespaceFilter, podRe)}}); err == nil {
		for _, ser := range series {
			reason := ser.Metric["reason"]
			if reason == "" {
				continue
			}
			k := ser.Metric["namespace"] + "\x00" + ser.Metric["pod"]
			reasonBy[k] = worseTermReason(reasonBy[k], reason)
		}
	}

	out := make([]PodRow, 0, len(byKey))
	emitted := map[string]bool{}
	for k, a := range byKey {
		ns, pod, _ := strings.Cut(k, "\x00")
		// Limit-only keys (limit configured, pod idle enough that
		// cpu/mem series absent) are noise — skip.
		if a.cpu == 0 && a.mem == 0 {
			continue
		}
		emitted[k] = true
		rst, rstKnown := restartBy[k]
		row := PodRow{Cluster: c.Name, Namespace: ns, Pod: pod,
			CPUCores: a.cpu, MemBytes: a.mem,
			Phase: phaseBy[k], Restarts: rst, RestartsUnknown: !rstKnown,
			LastTermReason: reasonBy[k]}
		if a.cpuLim > 0 {
			row.CPUPct = clampPct(a.cpu / a.cpuLim * 100)
		}
		if a.memLim > 0 {
			row.MemPct = clampPct(a.mem / a.memLim * 100)
		}
		// Request oranı bilerek clamp'siz: >100 aşımın kendisi sinyal.
		if a.cpuReq > 0 {
			row.CPUPctOfReq = a.cpu / a.cpuReq * 100
		}
		if a.memReq > 0 {
			row.MemPctOfReq = a.mem / a.memReq * 100
		}
		// v0.9.3 — ham değerler threshold çizgileri için satıra iner.
		row.CPULimitCores, row.MemLimitBytes = a.cpuLim, a.memLim
		row.CPURequestCores, row.MemRequestBytes = a.cpuReq, a.memReq
		row.NetInBps, row.NetOutBps = a.netIn, a.netOut
		out = append(out, row)
	}
	// v0.9.368 — çöken pod'lar geri geliyor: container'ı koşmayan bir pod'un
	// cAdvisor cpu/mem serisi YOKTUR, yani byKey'e hiç girmez (ya da noise
	// kuralına takılır) ve sekme tam servis yattığı anda "No pods matched"
	// diyordu. KSM faz/restart haritaları o pod'ları zaten biliyor —
	// applyDeployKSM'in aynası: sıfır-kaynaklı hayalet satır ekle.
	out = appendGhostPods(out, c.Name, emitted, phaseBy, restartBy, reasonBy)
	return out, truncated, nil
}

// appendGhostPods appends a zero-resource PodRow for every pod the KSM
// phase/restart maps know but the cAdvisor-based loop didn't emit — gated
// to pods that are actually interesting: a non-Running/non-Succeeded phase
// (Pending, Failed, Unknown) or a nonzero restart count. Healthy idle pods
// with a scrape gap stay excluded (the "limit-only keys are noise" rule).
// v0.9.1276 — reasonBy yalnız ALANI doldurur, kapıyı GENİŞLETMEZ:
// anahtar birleşimine girmez. Bir hayalet satırın var olma gerekçesi
// hâlâ kötü faz / nonzero restart; sebep serisi o gerekçeye eklenmez
// (yoksa "Completed" ile sonlanmış sağlıklı bir pod listeye sızardı).
// Ama satır ZATEN çiziliyorsa sebebi taşır — çünkü tam çökmüş pod,
// OOMKilled rozetinin en çok gerektiği yerdir.
//
// Pure; table-tested (ghost_pods_test.go, v0.9.368).
func appendGhostPods(out []PodRow, cluster string, emitted map[string]bool, phaseBy map[string]string, restartBy map[string]int, reasonBy map[string]string) []PodRow {
	keys := map[string]bool{}
	for k := range phaseBy {
		keys[k] = true
	}
	for k := range restartBy {
		keys[k] = true
	}
	for k := range keys {
		if emitted[k] {
			continue
		}
		phase := phaseBy[k]
		badPhase := phase != "" && phase != "Running" && phase != "Succeeded"
		if !badPhase && restartBy[k] == 0 {
			continue
		}
		ns, pod, _ := strings.Cut(k, "\x00")
		if pod == "" {
			continue
		}
		rst, rstKnown := restartBy[k]
		out = append(out, PodRow{Cluster: cluster, Namespace: ns, Pod: pod,
			Phase: phase, Restarts: rst, RestartsUnknown: !rstKnown,
			LastTermReason: reasonBy[k]})
	}
	return out
}

// ClusterSummary — genel görünüm kartının verisi (v0.8.586,
// redesign audit §3.1). Her alan kendi sorgusundan BEST-EFFORT
// dolar: token tenancy-port'a bağlıysa node ailesi boş kalır ama
// pod sayısı yine gelir (kısmi kart > hata kartı). Dört sorgunun
// DÖRDÜ de başarısızsa cluster erişilemez sayılır ve hata döner.
type ClusterSummary struct {
	Cluster      string  `json:"cluster"`
	Nodes        int     `json:"nodes,omitempty"`
	Pods         int     `json:"pods,omitempty"`
	CPUUsedCores float64 `json:"cpuUsedCores,omitempty"`
	MemUsedBytes float64 `json:"memUsedBytes,omitempty"`
	// v0.9.9 — cluster toplam network hızı (node-exporter, lo hariç).
	// Best-effort: seri yoksa 0 kalır, UI kartı hiç render etmez.
	NetInBps  float64 `json:"netInBps,omitempty"`
	NetOutBps float64 `json:"netOutBps,omitempty"`
	// v0.9.30 (design handoff B1) — kapasite (%), pod-fazı (donut),
	// firing-alert sayısı (banner/KPI). Hepsi best-effort; 0 =
	// kube-state-metrics/ALERTS serisi yok, UI ilgili görseli gizler.
	CPUCapacityCores float64 `json:"cpuCapacityCores,omitempty"`
	MemCapacityBytes float64 `json:"memCapacityBytes,omitempty"`
	PodsRunning      int     `json:"podsRunning,omitempty"`
	PodsPending      int     `json:"podsPending,omitempty"`
	PodsFailed       int     `json:"podsFailed,omitempty"`
	AlertsCritical   int     `json:"alertsCritical,omitempty"`
	AlertsWarning    int     `json:"alertsWarning,omitempty"`
}

// Summary — kart başına sabit 4 skaler sorgu (topk'li vektör yok;
// pod sayısı topk kesmesiz TAM).
func (s *Service) Summary(ctx context.Context, c ClusterConfig) (ClusterSummary, error) {
	out := ClusterSummary{Cluster: c.Name}
	okCount := 0
	var lastErr error
	scalar := func(q string) (float64, bool) {
		series, err := s.doQuery(ctx, c, "/api/v1/query", url.Values{"query": {q}})
		if err != nil {
			lastErr = err
			return 0, false
		}
		okCount++
		if len(series) == 0 {
			return 0, true // sorgu çalıştı, seri yok (0 kabul)
		}
		v, ok := sampleValue(series[0].Value)
		return v, ok
	}
	if v, ok := scalar(summaryNodeCountQuery); ok {
		out.Nodes = int(v)
	}
	if v, ok := scalar(summaryPodCountQuery(c.NamespaceFilter)); ok {
		out.Pods = int(v)
	}
	if v, ok := scalar(summaryCPUUsedQuery); ok {
		out.CPUUsedCores = v
	}
	if v, ok := scalar(summaryMemUsedQuery); ok {
		out.MemUsedBytes = v
	}
	if v, ok := scalar(summaryNetQuery("receive")); ok {
		out.NetInBps = v
	}
	if v, ok := scalar(summaryNetQuery("transmit")); ok {
		out.NetOutBps = v
	}
	// v0.9.30 — kapasite + pod-fazı + alert (best-effort; skaler,
	// serveCached 60s amortismanlı). Aynı okCount/lastErr sözleşmesi.
	if v, ok := scalar(summaryCPUCapacityQuery); ok {
		out.CPUCapacityCores = v
	}
	if v, ok := scalar(summaryMemCapacityQuery); ok {
		out.MemCapacityBytes = v
	}
	if v, ok := scalar(summaryPodPhaseQuery("Running", c.NamespaceFilter)); ok {
		out.PodsRunning = int(v)
	}
	if v, ok := scalar(summaryPodPhaseQuery("Pending", c.NamespaceFilter)); ok {
		out.PodsPending = int(v)
	}
	if v, ok := scalar(summaryPodPhaseQuery("Failed", c.NamespaceFilter)); ok {
		out.PodsFailed = int(v)
	}
	if v, ok := scalar(summaryAlertCountQuery("critical")); ok {
		out.AlertsCritical = int(v)
	}
	if v, ok := scalar(summaryAlertCountQuery("warning")); ok {
		out.AlertsWarning = int(v)
	}
	if okCount == 0 && lastErr != nil {
		return ClusterSummary{}, lastErr
	}
	return out, nil
}

// NamespaceRow — bir namespace'in rollup satırı (v0.8.588, redesign
// audit §3.3). Ayrı sorgudan gelir — pod listesinin topk kesmesinden
// ETKİLENMEZ (toplamlar tam).
type NamespaceRow struct {
	Cluster   string  `json:"cluster"`
	Namespace string  `json:"namespace"`
	Pods      int     `json:"pods,omitempty"`
	CPUCores  float64 `json:"cpuCores"`
	MemBytes  float64 `json:"memBytes"`
	// v0.9.37 (B4) — restart toplamı + failing pod sayısı (best-effort).
	Restarts int `json:"restarts,omitempty"`
	Failing  int `json:"failing,omitempty"`
}

// NamespaceMetrics — cpu+mem zorunlu (2 sorgu), pod sayısı
// best-effort (1 sorgu; aynı metrik ailesi, pratikte hep döner).
func (s *Service) NamespaceMetrics(ctx context.Context, c ClusterConfig) ([]NamespaceRow, error) {
	type acc struct {
		cpu, mem float64
		pods     float64
	}
	byNS := map[string]*acc{}
	get := func(m map[string]string) *acc {
		k := m["namespace"]
		a := byNS[k]
		if a == nil {
			a = &acc{}
			byNS[k] = a
		}
		return a
	}
	for _, q := range []struct {
		query string
		set   func(*acc, float64)
	}{
		{nsCPUQuery(c.NamespaceFilter), func(a *acc, v float64) { a.cpu = v }},
		{nsMemQuery(c.NamespaceFilter), func(a *acc, v float64) { a.mem = v }},
	} {
		series, err := s.doQuery(ctx, c, "/api/v1/query", url.Values{"query": {q.query}})
		if err != nil {
			return nil, err
		}
		for _, ser := range series {
			if v, ok := sampleValue(ser.Value); ok {
				q.set(get(ser.Metric), v)
			}
		}
	}
	if series, err := s.doQuery(ctx, c, "/api/v1/query",
		url.Values{"query": {nsPodCountQuery(c.NamespaceFilter)}}); err == nil {
		for _, ser := range series {
			if v, ok := sampleValue(ser.Value); ok {
				get(ser.Metric).pods = v
			}
		}
	}
	// v0.9.37 (B4) — best-effort restart toplamı + failing pod sayısı.
	restartBy := map[string]int{}
	if series, err := s.doQuery(ctx, c, "/api/v1/query", url.Values{"query": {nsRestartsQuery(c.NamespaceFilter)}}); err == nil {
		for _, ser := range series {
			if v, ok := sampleValue(ser.Value); ok {
				restartBy[ser.Metric["namespace"]] = int(v)
			}
		}
	}
	failingBy := map[string]int{}
	if series, err := s.doQuery(ctx, c, "/api/v1/query", url.Values{"query": {nsFailingQuery(c.NamespaceFilter)}}); err == nil {
		for _, ser := range series {
			if v, ok := sampleValue(ser.Value); ok {
				failingBy[ser.Metric["namespace"]] = int(v)
			}
		}
	}
	out := make([]NamespaceRow, 0, len(byNS))
	for ns, a := range byNS {
		if ns == "" || (a.cpu == 0 && a.mem == 0) {
			continue // count-only anahtarlar gürültü (kurulu eleme sözleşmesi)
		}
		out = append(out, NamespaceRow{
			Cluster: c.Name, Namespace: ns,
			Pods: int(a.pods), CPUCores: a.cpu, MemBytes: a.mem,
			Restarts: restartBy[ns], Failing: failingBy[ns],
		})
	}
	return out, nil
}

// DeploymentRow — bir namespace içindeki iş yükü (Deployment/STS/DS)
// rollup satırı (v0.9.22). PodNames pod tablosunun ?deployment=
// süzgecini besler (istemci üyelikle süzer — ad-önek sezgiseli
// değil, gerçek eşleme).
type DeploymentRow struct {
	Cluster    string   `json:"cluster"`
	Namespace  string   `json:"namespace"`
	Deployment string   `json:"deployment"`
	Pods       int      `json:"pods"`
	CPUCores   float64  `json:"cpuCores"`
	MemBytes   float64  `json:"memBytes"`
	PodNames   []string `json:"podNames"`
	// v0.9.39 — KSM replicas/status (best-effort). Status boş = KSM
	// ailesi bu iş yükü için yok (heuristik eşleşen StatefulSet/
	// DaemonSet dahil); ready/desired yalnız Status doluyken anlamlı.
	DesiredReplicas int    `json:"desiredReplicas"`
	ReadyReplicas   int    `json:"readyReplicas"`
	Status          string `json:"status,omitempty"`
}

// unassignedWorkload — eşlenemeyen pod'ların toplandığı satır adı.
const unassignedWorkload = "(unassigned)"

// deployStatus — KSM verisinden Deployment statü türetimi (v0.9.39,
// design handoff §5). Available=false koşulu her şeyi ezer (kapasite
// altı = Degraded); ready<desired rollout demektir (Progressing);
// kalan her durum — scale-to-zero'nun 0/0'ı dahil — Available.
func deployStatus(ready, desired int, availFalse bool) string {
	switch {
	case availFalse:
		return "Degraded"
	case ready < desired:
		return "Progressing"
	default:
		return "Available"
	}
}

// DeploymentMetrics — namespace'in pod başına cpu/mem'ini (zorunlu 2
// sorgu) kube-state-metrics owner eşlemesiyle (best-effort 2 sorgu)
// iş yüküne toplar. Fallback zinciri (deployment audit uyarlaması —
// probe yerine runtime): tam join → rs-hash soyma → pod-adı sezgiseli
// → "(unassigned)".
func (s *Service) DeploymentMetrics(ctx context.Context, c ClusterConfig, namespace string) ([]DeploymentRow, error) {
	// Zorunlu: pod başına cpu/mem (mevcut multi-pod sorguları).
	params := func(q string) url.Values { return url.Values{"query": {q}} }
	cpuSeries, err := s.doQuery(ctx, c, "/api/v1/query", params(nsPodsCPUTrendQuery(namespace)))
	if err != nil {
		return nil, err
	}
	memSeries, err := s.doQuery(ctx, c, "/api/v1/query", params(nsPodsMemTrendQuery(namespace)))
	if err != nil {
		return nil, err
	}

	// Best-effort eşleme aileleri.
	podToRS := map[string]string{}
	if series, err := s.doQuery(ctx, c, "/api/v1/query", params(nsPodOwnerQuery(namespace))); err == nil {
		for _, ser := range series {
			if p, rs := ser.Metric["pod"], ser.Metric["owner_name"]; p != "" && rs != "" {
				podToRS[p] = rs
			}
		}
	}
	rsToDeploy := map[string]string{}
	if series, err := s.doQuery(ctx, c, "/api/v1/query", params(nsReplicaSetOwnerQuery(namespace))); err == nil {
		for _, ser := range series {
			if rs, d := ser.Metric["replicaset"], ser.Metric["owner_name"]; rs != "" && d != "" {
				rsToDeploy[rs] = d
			}
		}
	}

	workloadOf := func(pod string) string {
		if rs, ok := podToRS[pod]; ok {
			if d, ok2 := rsToDeploy[rs]; ok2 {
				return d // tam join
			}
			// rs bilinen ama deploy ailesi yok: rs-hash'i soy.
			if i := strings.LastIndex(rs, "-"); i > 0 && isReplicaSetHash(rs[i+1:]) {
				return rs[:i]
			}
			return rs
		}
		if w := stripPodSuffixes(pod); w != pod || !strings.Contains(pod, "-") {
			return w
		}
		return unassignedWorkload
	}

	type acc struct {
		cpu, mem float64
		pods     []string
	}
	byWorkload := map[string]*acc{}
	touch := func(pod string) *acc {
		w := workloadOf(pod)
		a := byWorkload[w]
		if a == nil {
			a = &acc{}
			byWorkload[w] = a
		}
		return a
	}
	seenPod := map[string]bool{}
	for _, ser := range cpuSeries {
		pod := ser.Metric["pod"]
		if pod == "" {
			continue
		}
		if v, ok := sampleValue(ser.Value); ok {
			a := touch(pod)
			a.cpu += v
			if !seenPod[pod] {
				a.pods = append(a.pods, pod)
				seenPod[pod] = true
			}
		}
	}
	for _, ser := range memSeries {
		pod := ser.Metric["pod"]
		if pod == "" {
			continue
		}
		if v, ok := sampleValue(ser.Value); ok {
			a := touch(pod)
			a.mem += v
			if !seenPod[pod] {
				a.pods = append(a.pods, pod)
				seenPod[pod] = true
			}
		}
	}

	out := make([]DeploymentRow, 0, len(byWorkload))
	for w, a := range byWorkload {
		sort.Strings(a.pods)
		out = append(out, DeploymentRow{
			Cluster: c.Name, Namespace: namespace, Deployment: w,
			Pods: len(a.pods), CPUCores: a.cpu, MemBytes: a.mem,
			PodNames: a.pods,
		})
	}
	sort.Slice(out, func(i, j int) bool {
		if out[i].CPUCores != out[j].CPUCores {
			return out[i].CPUCores > out[j].CPUCores
		}
		return out[i].Deployment < out[j].Deployment
	})

	// v0.9.39 (design handoff §5) — best-effort KSM replicas/status.
	// v0.9.42 (adversarial review) — zenginleştirme HEP-YA-DA-HİÇ:
	// üç sorgudan herhangi biri HATA verirse (örn. paylaşılan ctx
	// bütçesinin son sorguya yetmemesi) hiç dokunulmaz — Status boş
	// kalır, UI '—' basar. Eski hali ready hatasında tüm namespace'e
	// "0/N Progressing", availFalse hatasında Degraded→Available
	// okutuyordu (fake-zero sınıfı, görünmez-düşer ihlali).
	desired := map[string]int{}
	ready := map[string]int{}
	availFalse := map[string]bool{}
	ksmOK := true
	if series, err := s.doQuery(ctx, c, "/api/v1/query", params(nsDeployDesiredQuery(namespace))); err == nil {
		for _, ser := range series {
			if d := ser.Metric["deployment"]; d != "" {
				if v, ok := sampleValue(ser.Value); ok {
					desired[d] = int(v)
				}
			}
		}
	} else {
		ksmOK = false
	}
	if ksmOK && len(desired) > 0 {
		if series, err := s.doQuery(ctx, c, "/api/v1/query", params(nsDeployReadyQuery(namespace))); err == nil {
			for _, ser := range series {
				if d := ser.Metric["deployment"]; d != "" {
					if v, ok := sampleValue(ser.Value); ok {
						ready[d] = int(v)
					}
				}
			}
		} else {
			ksmOK = false
		}
	}
	if ksmOK && len(desired) > 0 {
		if series, err := s.doQuery(ctx, c, "/api/v1/query", params(nsDeployAvailFalseQuery(namespace))); err == nil {
			for _, ser := range series {
				if d := ser.Metric["deployment"]; d != "" {
					availFalse[d] = true
				}
			}
		} else {
			ksmOK = false
		}
	}
	if ksmOK {
		out = applyDeployKSM(out, c.Name, namespace, desired, ready, availFalse)
	}
	return out, nil
}

// applyDeployKSM — KSM replica/status haritalarını satırlara işler ve
// cAdvisor serisi OLMAYAN deployment'ları sıfır-kaynaklı satır olarak
// ekler (v0.9.42): tamamen düşmüş bir deployment'ın (0 koşan pod →
// 0 cpu/mem serisi → 0 satır) tabloda görünmez olması, tablonun en
// gerekli olduğu anda kör kalması demekti. Scale-to-zero (0/0) da
// artık Available satırı olarak görünür — iş yükü envanteri gerçeğe
// döner. Çağıran üç KSM sorgusunun ÜÇÜNÜN DE başarısını garanti eder
// (hep-ya-da-hiç); kısmi veri fake-zero üretir.
func applyDeployKSM(rows []DeploymentRow, cluster, namespace string, desired, ready map[string]int, availFalse map[string]bool) []DeploymentRow {
	if len(desired) == 0 {
		return rows
	}
	seen := map[string]bool{}
	for i := range rows {
		seen[rows[i].Deployment] = true
		d, ok := desired[rows[i].Deployment]
		if !ok {
			continue
		}
		rows[i].DesiredReplicas = d
		rows[i].ReadyReplicas = ready[rows[i].Deployment]
		rows[i].Status = deployStatus(rows[i].ReadyReplicas, d, availFalse[rows[i].Deployment])
	}
	missing := make([]string, 0)
	for name := range desired {
		if !seen[name] {
			missing = append(missing, name)
		}
	}
	sort.Strings(missing) // deterministik ek sırası (cpu=0 → listede sona düşerler)
	for _, name := range missing {
		d := desired[name]
		rows = append(rows, DeploymentRow{
			Cluster: cluster, Namespace: namespace, Deployment: name,
			PodNames:        []string{},
			DesiredReplicas: d, ReadyReplicas: ready[name],
			Status: deployStatus(ready[name], d, availFalse[name]),
		})
	}
	return rows
}

// NodeRow — bir node'un anlık CPU/memory kullanımı (v0.8.582,
// audit: clusters-node-metrics-audit.md §3). Node = kube_node_info
// eşleşirse gerçek node adı, yoksa instance (ip:port). Pct'ler
// kendi paydalarına oran: CPUPct çekirdek sayısına (best-effort —
// 0 = bilinmiyor), MemPct MemTotal'a (zorunlu aileden, hep dolu).
type NodeRow struct {
	Cluster  string  `json:"cluster"`
	Node     string  `json:"node"`
	CPUCores float64 `json:"cpuCores"`
	MemBytes float64 `json:"memBytes"`
	CPUPct   float64 `json:"cpuPct,omitempty"`
	MemPct   float64 `json:"memPct,omitempty"`
	// v0.9.9 — node network hızı (node-exporter, lo hariç; best-effort).
	NetInBps  float64 `json:"netInBps,omitempty"`
	NetOutBps float64 `json:"netOutBps,omitempty"`
	// v0.9.37 (B4) — rol (heatmap dot + Nodes tab); kube_node_role.
	Role string `json:"role,omitempty"`
}

// instanceHost — "10.0.1.5:9100" → "10.0.1.5" (kube_node_info
// internal_ip join anahtarı). IPv6 "[::1]:9100" köşeli ayracını da
// soyar; port'suz değer olduğu gibi döner.
func instanceHost(inst string) string {
	// v0.9.19 (self-review fix) — port ayrımı kolon SAYISIYLA:
	// tek ':' = host:port (soy), '[...]:port' = köşeli IPv6 (soy),
	// çoklu ':' ayraçsız = ÇIPLAK IPv6 ('fe80::1') — dokunma. Eski
	// kod son grubu kırpıp ('fe80:') kube_node_info join'ini sessizce
	// bozuyordu; "son grup rakam mı" sezgiseli de IPv6'da yanılır.
	if strings.HasPrefix(inst, "[") {
		if i := strings.LastIndex(inst, "]:"); i > 0 {
			inst = inst[:i+1]
		}
	} else if strings.Count(inst, ":") == 1 {
		inst = inst[:strings.Index(inst, ":")]
	}
	return strings.Trim(inst, "[]")
}

// NodeMetrics — PodMetrics'in node-scope aynası: 3 zorunlu sorgu
// (cpu used, mem total, mem avail) + 2 best-effort (çekirdek
// sayısı, kube_node_info ad güzelleştirmesi). Sabit 5 sorgu/cluster.
func (s *Service) NodeMetrics(ctx context.Context, c ClusterConfig) ([]NodeRow, error) {
	type acc struct{ cpuUsed, memTotal, memAvail, cores, netIn, netOut float64 }
	byInst := map[string]*acc{}
	get := func(m map[string]string) *acc {
		k := m["instance"]
		a := byInst[k]
		if a == nil {
			a = &acc{}
			byInst[k] = a
		}
		return a
	}

	for _, q := range []struct {
		query string
		set   func(*acc, float64)
	}{
		{nodeCPUQuery(), func(a *acc, v float64) { a.cpuUsed = v }},
		{nodeMemTotalQuery(), func(a *acc, v float64) { a.memTotal = v }},
		{nodeMemAvailQuery(), func(a *acc, v float64) { a.memAvail = v }},
	} {
		series, err := s.doQuery(ctx, c, "/api/v1/query", url.Values{"query": {q.query}})
		if err != nil {
			return nil, err
		}
		for _, ser := range series {
			if v, ok := sampleValue(ser.Value); ok {
				q.set(get(ser.Metric), v)
			}
		}
	}
	// Best-effort: çekirdek sayısı (CPU% paydası).
	if series, err := s.doQuery(ctx, c, "/api/v1/query",
		url.Values{"query": {nodeCPUCountQuery()}}); err == nil {
		for _, ser := range series {
			if v, ok := sampleValue(ser.Value); ok {
				get(ser.Metric).cores = v
			}
		}
	}
	// v0.9.9 — best-effort: network hızları.
	for _, nq := range []struct {
		dir string
		set func(*acc, float64)
	}{
		{"receive", func(a *acc, v float64) { a.netIn = v }},
		{"transmit", func(a *acc, v float64) { a.netOut = v }},
	} {
		if series, err := s.doQuery(ctx, c, "/api/v1/query",
			url.Values{"query": {nodeNetQuery(nq.dir)}}); err == nil {
			for _, ser := range series {
				if v, ok := sampleValue(ser.Value); ok {
					nq.set(get(ser.Metric), v)
				}
			}
		}
	}
	// Best-effort: internal_ip → node adı.
	names := map[string]string{}
	if series, err := s.doQuery(ctx, c, "/api/v1/query",
		url.Values{"query": {nodeInfoQuery}}); err == nil {
		for _, ser := range series {
			if ip, node := ser.Metric["internal_ip"], ser.Metric["node"]; ip != "" && node != "" {
				names[ip] = node
			}
		}
	}
	// v0.9.37 (B4) — best-effort node rolü (node adı anahtarlı).
	roleByNode := map[string]string{}
	if series, err := s.doQuery(ctx, c, "/api/v1/query", url.Values{"query": {nodeRoleQuery}}); err == nil {
		for _, ser := range series {
			if node, role := ser.Metric["node"], ser.Metric["role"]; node != "" && role != "" {
				// master/control-plane rolü worker'ı ezer (çok-rollü node).
				if cur := roleByNode[node]; cur == "" || role == "master" || role == "control-plane" {
					roleByNode[node] = role
				}
			}
		}
	}

	out := make([]NodeRow, 0, len(byInst))
	for inst, a := range byInst {
		// Yalnız best-effort serisi taşıyan anahtarlar gürültü
		// (PodMetrics'in limit-only eleme sözleşmesi).
		if a.cpuUsed == 0 && a.memTotal == 0 {
			continue
		}
		name := inst
		if pretty := names[instanceHost(inst)]; pretty != "" {
			name = pretty
		}
		row := NodeRow{Cluster: c.Name, Node: name, CPUCores: a.cpuUsed,
			NetInBps: a.netIn, NetOutBps: a.netOut}
		if a.memTotal > 0 {
			row.MemBytes = a.memTotal - a.memAvail
			row.MemPct = clampPct(row.MemBytes / a.memTotal * 100)
		}
		if a.cores > 0 {
			row.CPUPct = clampPct(a.cpuUsed / a.cores * 100)
		}
		row.Role = roleByNode[name] // ad kube_node_info ile eşleştiyse
		out = append(out, row)
	}
	return out, nil
}

// PodTrend returns per-bucket CPU + memory for ONE pod (drawer
// path — bounded by construction). Bucket = adaptif step
// (stepForWindow, v0.9.26): dar pencerede 15s'e kadar iner.
func (s *Service) PodTrend(ctx context.Context, c ClusterConfig, namespace, pod string, from, to time.Time) ([]TrendPoint, error) {
	return s.rangeTrend(ctx, c,
		singlePodCPUQuery(namespace, pod), singlePodMemQuery(namespace, pod), from, to)
}

// NamespaceTrend — PodTrend'in namespace-scoped aynası (v0.9.2):
// aynı dakika-bucket sözleşmesi, pod pini yok — namespace toplamı.
func (s *Service) NamespaceTrend(ctx context.Context, c ClusterConfig, namespace string, from, to time.Time) ([]TrendPoint, error) {
	return s.rangeTrend(ctx, c,
		singleNamespaceCPUQuery(namespace), singleNamespaceMemQuery(namespace), from, to)
}

// NetTrendPoint — cluster network throughput trendi (v0.9.9):
// dakika bucket'ında in/out byte/s.
type NetTrendPoint struct {
	Bucket int64   `json:"bucket"`
	InBps  float64 `json:"inBps"`
	OutBps float64 `json:"outBps"`
}

// AlertRow — firing bir alert (v0.9.36, design handoff B3 + panel).
// AgeSec best-effort (ALERTS_FOR_STATE join'i; yoksa 0).
type AlertRow struct {
	AlertName string `json:"alertName"`
	Severity  string `json:"severity"`
	Namespace string `json:"namespace,omitempty"`
	Pod       string `json:"pod,omitempty"`
	AgeSec    int64  `json:"ageSec,omitempty"`
}

// alertKey — (alertname, namespace, pod) üçlüsü; yaş join anahtarı.
func alertKey(m map[string]string) string {
	return m["alertname"] + "\x00" + m["namespace"] + "\x00" + m["pod"]
}

// FiringAlerts — firing alert listesi (kritik-önce). ALERTS
// (authoritative firing set) + ALERTS_FOR_STATE (best-effort yaş,
// join by label). Metrik yoksa boş liste; UI paneli gizler.
func (s *Service) FiringAlerts(ctx context.Context, c ClusterConfig) ([]AlertRow, error) {
	series, err := s.doQuery(ctx, c, "/api/v1/query",
		url.Values{"query": {`ALERTS{alertstate="firing"}`}})
	if err != nil {
		return nil, err
	}
	// Best-effort yaş: time() - ALERTS_FOR_STATE → saniye.
	ageBy := map[string]int64{}
	if ages, err := s.doQuery(ctx, c, "/api/v1/query",
		url.Values{"query": {`time() - ALERTS_FOR_STATE`}}); err == nil {
		for _, ser := range ages {
			if v, ok := sampleValue(ser.Value); ok && v >= 0 {
				ageBy[alertKey(ser.Metric)] = int64(v)
			}
		}
	}
	out := make([]AlertRow, 0, len(series))
	for _, ser := range series {
		m := ser.Metric
		out = append(out, AlertRow{
			AlertName: m["alertname"], Severity: m["severity"],
			Namespace: m["namespace"], Pod: m["pod"],
			AgeSec: ageBy[alertKey(m)],
		})
	}
	// Kritik-önce, sonra ad — deterministik.
	sort.Slice(out, func(i, j int) bool {
		ci, cj := out[i].Severity == "critical", out[j].Severity == "critical"
		if ci != cj {
			return ci
		}
		return out[i].AlertName < out[j].AlertName
	})
	return out, nil
}

// NamedSeries — adlandırılmış çok-serili trend (v0.9.35): total
// modda tek seri (Name=""), byNode modda instance başına.
type NamedSeries struct {
	Name   string       `json:"name"`
	Points []ValuePoint `json:"points"`
}

type ValuePoint struct {
	Bucket int64   `json:"bucket"`
	Value  float64 `json:"value"`
}

// ResourceTrend — Overview CPU/Mem area chart verisi. metric
// "cpu"|"mem"; byNode false→tek toplam seri, true→top-N instance.
// Bucket adaptif step'e bağlı (stepForWindow); byNode'da instance
// adı instanceHost ile güzelleştirilir.
func (s *Service) ResourceTrend(ctx context.Context, c ClusterConfig, metric string, byNode bool, from, to time.Time) ([]NamedSeries, error) {
	return s.resourceTrendWith(ctx, c, resourceTrendQuery(metric, byNode), byNode, from, to)
}

// NodeResourceTrend — v0.10.142: tek node (topk yok); seri adı instance host.
func (s *Service) NodeResourceTrend(ctx context.Context, c ClusterConfig, metric, host string, from, to time.Time) ([]NamedSeries, error) {
	return s.resourceTrendWith(ctx, c, nodeResourceTrendQuery(metric, host), true, from, to)
}

func (s *Service) resourceTrendWith(ctx context.Context, c ClusterConfig, query string, byNode bool, from, to time.Time) ([]NamedSeries, error) {
	step := stepForWindow(from, to)
	params := url.Values{
		"query": {query},
		"start": {fmt.Sprintf("%d", from.Unix())},
		"end":   {fmt.Sprintf("%d", to.Unix())},
		"step":  {fmt.Sprintf("%d", step)},
	}
	series, err := s.doQuery(ctx, c, "/api/v1/query_range", params)
	if err != nil {
		return nil, err
	}
	out := make([]NamedSeries, 0, len(series))
	for _, ser := range series {
		name := ""
		if byNode {
			name = instanceHost(ser.Metric["instance"])
		}
		pts := make([]ValuePoint, 0, len(ser.Values))
		for _, pair := range ser.Values {
			if v, ts, ok := samplePair(pair); ok {
				pts = append(pts, ValuePoint{Bucket: ts - ts%int64(step), Value: v})
			}
		}
		if len(pts) > 0 {
			out = append(out, NamedSeries{Name: name, Points: pts})
		}
	}
	return out, nil
}

// DeployTrend — bir deployment'ın pod'larına kapsanmış CPU/Mem trendi
// (v0.9.50, design handoff §8 — Servis → Infrastructure sekmesi).
// ResourceTrend'in deployment-kapsamlı aynası: total tek seri, byPod
// modunda sum by (pod) ham çekilir ve top-8 seçimi ortalamaya göre
// Go'da yapılır (topk'siz — v0.9.3 adım-kayması notu). Metrik ailesi
// yoksa boş döner; UI grafiği gizler (görünmez-düşer).
// İkinci dönüş (v0.9.539): kesme ÖNCESİ seri sayısı — UI "N / M pod"
// rozetini bununla çizer (NamespacePodsTrend'in aynı sözleşmesi).
// mdp (v0.10.287, chart audit D2) — istemci piksel bütçesi; 0 = merdiven.
func (s *Service) DeployTrend(ctx context.Context, c ClusterConfig, namespace, deploy, metric string, byPod bool, from, to time.Time, mdp int) ([]NamedSeries, int, error) {
	step := stepForWindowMDP(from, to, mdp)
	params := url.Values{
		"query": {deployTrendQuery(namespace, deploy, metric, byPod)},
		"start": {fmt.Sprintf("%d", from.Unix())},
		"end":   {fmt.Sprintf("%d", to.Unix())},
		"step":  {fmt.Sprintf("%d", step)},
	}
	series, err := s.doQuery(ctx, c, "/api/v1/query_range", params)
	if err != nil {
		return nil, 0, err
	}
	type acc struct {
		pts  []ValuePoint
		sum  float64
		name string
	}
	all := make([]acc, 0, len(series))
	for _, ser := range series {
		name := ""
		if byPod {
			name = ser.Metric["pod"]
		}
		pts := make([]ValuePoint, 0, len(ser.Values))
		sum := 0.0
		for _, pair := range ser.Values {
			if v, ts, ok := samplePair(pair); ok {
				pts = append(pts, ValuePoint{Bucket: ts - ts%int64(step), Value: v})
				sum += v
			}
		}
		if len(pts) > 0 {
			all = append(all, acc{pts: pts, sum: sum / float64(len(pts)), name: name})
		}
	}
	// v0.9.539 — kesme ÖNCESİ seri sayısı çağırana döner: 17 pod'un
	// 8'i çizilirken operatörün bunu bilmesi gerekiyor (operator-
	// reported: "17 pod var ama series kısmında 7 tane gösteriyor").
	// İfşa mekanizması (MetricArea totalSeries rozeti) v0.9.370'ten
	// beri vardı ama bu yol onu BESLEMİYORDU — sessiz kesme.
	total := len(all)
	if byPod && len(all) > maxPodTrendSeries {
		sort.Slice(all, func(i, j int) bool {
			if all[i].sum != all[j].sum {
				return all[i].sum > all[j].sum
			}
			return all[i].name < all[j].name
		})
		all = all[:maxPodTrendSeries]
	}
	out := make([]NamedSeries, 0, len(all))
	for _, a := range all {
		out = append(out, NamedSeries{Name: a.name, Points: a.pts})
	}
	return out, total, nil
}

// HaproxyTrend — v0.9.534. Namespace'in route'larına router (HAProxy)
// gözünden trend: kind = "2xx" | "5xx" (yanıt oranı, req/s) | "latency"
// (backend ortalama, ms). DeployTrend'in aynası: query_range, seri adı
// route etiketi, top-N seçimi ortalamaya göre Go'da (topk'siz —
// v0.9.3 adım-kayması notu). Metrik ailesi cluster'da yoksa boş döner;
// UI bölümü gizler (görünmez-düşer).
func (s *Service) HaproxyTrend(ctx context.Context, c ClusterConfig, namespace, kind string, from, to time.Time) ([]NamedSeries, error) {
	step := stepForWindow(from, to)
	params := url.Values{
		"query": {haproxyTrendQuery(namespace, kind)},
		"start": {fmt.Sprintf("%d", from.Unix())},
		"end":   {fmt.Sprintf("%d", to.Unix())},
		"step":  {fmt.Sprintf("%d", step)},
	}
	series, err := s.doQuery(ctx, c, "/api/v1/query_range", params)
	if err != nil {
		return nil, err
	}
	type acc struct {
		pts  []ValuePoint
		sum  float64
		name string
	}
	all := make([]acc, 0, len(series))
	for _, ser := range series {
		name := ser.Metric["route"]
		pts := make([]ValuePoint, 0, len(ser.Values))
		sum := 0.0
		for _, pair := range ser.Values {
			if v, ts, ok := samplePair(pair); ok {
				pts = append(pts, ValuePoint{Bucket: ts - ts%int64(step), Value: v})
				sum += v
			}
		}
		if len(pts) > 0 {
			all = append(all, acc{pts: pts, sum: sum / float64(len(pts)), name: name})
		}
	}
	if len(all) > maxTrendSeries {
		sort.Slice(all, func(i, j int) bool {
			if all[i].sum != all[j].sum {
				return all[i].sum > all[j].sum
			}
			return all[i].name < all[j].name
		})
		all = all[:maxTrendSeries]
	}
	out := make([]NamedSeries, 0, len(all))
	for _, a := range all {
		out = append(out, NamedSeries{Name: a.name, Points: a.pts})
	}
	return out, nil
}

// JMXMetricNames — bir deployment'ın Thanos'ta taşıdığı jvm_/jboss_ metrik
// ADLARINI keşfeder (v0.9.144 auto-discovery). count by (__name__) instant
// sorgusu; her serinin __name__ label'ını toplar, sıralı+tekilleştirir.
// Boş dönmesi = cluster'da servisin JMX'i yok (UI o cluster'ı göstermez).
func (s *Service) JMXMetricNames(ctx context.Context, c ClusterConfig, namespace, deploy string) ([]string, error) {
	series, err := s.doQuery(ctx, c, "/api/v1/query",
		url.Values{"query": {jmxDiscoveryQuery(namespace, deploy)}})
	if err != nil {
		return nil, err
	}
	seen := map[string]bool{}
	out := make([]string, 0, len(series))
	for _, ser := range series {
		if n := ser.Metric["__name__"]; n != "" && !seen[n] {
			seen[n] = true
			out = append(out, n)
		}
	}
	sort.Strings(out)
	return out, nil
}

// JMXTrend — keşfedilen bir JBoss/JVM JMX metriğinin trendi (v0.9.140,
// selector+discovery v0.9.144). DeployTrend'in JMX aynası: aynı query_range
// + Go-tarafı top-8 seçimi (topk'siz), tek fark seri adının `pod` label'ından
// okunması ve JMX-özel selector (jmxTrendQuery). Metrik ailesi yoksa boş
// döner; UI grafiği gizler (görünmez-düşer).
// İkinci dönüş (v0.9.370): kesme ÖNCESİ toplam seri sayısı. Saf pod
// grouping'te top-8 kesilir (aşağıda) ve UI "8 / N pod" diyebilsin diye
// N burada döner — sekmenin var olma sebebi "hangi pod'un heap'i dolu"
// sorusuyken en DÜŞÜK ortalamalı pod'ların sessizce düşmesi, pencere
// sonunda OOM'a tırmanan pod'u da düşürebiliyordu (ortalaması düşük).
func (s *Service) JMXTrend(ctx context.Context, c ClusterConfig, namespace, deploy, metric string, byPod bool, podFilter string, from, to time.Time) ([]NamedSeries, int, error) {
	step := stepForWindow(from, to)
	params := url.Values{
		"query": {jmxTrendQuery(namespace, deploy, metric, byPod, podFilter)},
		"start": {fmt.Sprintf("%d", from.Unix())},
		"end":   {fmt.Sprintf("%d", to.Unix())},
		"step":  {fmt.Sprintf("%d", step)},
	}
	series, err := s.doQuery(ctx, c, "/api/v1/query_range", params)
	if err != nil {
		return nil, 0, err
	}
	byClause, nameLabels := jmxGrouping(metric, byPod)
	type acc struct {
		pts  []ValuePoint
		sum  float64
		name string
	}
	all := make([]acc, 0, len(series))
	for _, ser := range series {
		// Ad = nameLabels'ın DOLU değerleri " · " ile (coalesce: regular DS
		// data_source, XA DS xa_data_source, pod eklenirse sonuna).
		var parts []string
		for _, l := range nameLabels {
			if v := ser.Metric[l]; v != "" {
				parts = append(parts, v)
			}
		}
		name := strings.Join(parts, " · ")
		pts := make([]ValuePoint, 0, len(ser.Values))
		sum := 0.0
		for _, pair := range ser.Values {
			if v, ts, ok := samplePair(pair); ok {
				pts = append(pts, ValuePoint{Bucket: ts - ts%int64(step), Value: v})
				sum += v
			}
		}
		if len(pts) > 0 {
			all = append(all, acc{pts: pts, sum: sum / float64(len(pts)), name: name})
		}
	}
	// top-N YALNIZ saf pod grouping'te (jvm by pod, çok pod olabilir);
	// datasource serilerini KESME (operatör: 5-10+ datasource hepsi görünsün).
	total := len(all)
	if byClause == "pod" && len(all) > maxTrendSeries {
		sort.Slice(all, func(i, j int) bool {
			if all[i].sum != all[j].sum {
				return all[i].sum > all[j].sum
			}
			return all[i].name < all[j].name
		})
		all = all[:maxTrendSeries]
	}
	out := make([]NamedSeries, 0, len(all))
	for _, a := range all {
		out = append(out, NamedSeries{Name: a.name, Points: a.pts})
	}
	return out, total, nil
}

// NetworkTrend — cluster toplam ağ hızının dakika-bucket trendi
// (Overview throughput grafiği). rangeTrend'in net karşılığı; iki
// sorgu da zorunlu (grafiğin kendisi bu — best-effort'luk üst
// katmanda: seri boşsa UI grafiği hiç göstermez).
func (s *Service) NetworkTrend(ctx context.Context, c ClusterConfig, from, to time.Time) ([]NetTrendPoint, error) {
	// v0.9.26 — adaptif step, TABAN 15s; bucket rounding da bu
	// step'e bağlanır (aksi halde 60s yuvarlaması saniye-altı
	// çözünürlüğü çöpe atardı).
	step := stepForWindow(from, to)
	params := func(q string) url.Values {
		return url.Values{
			"query": {q},
			"start": {fmt.Sprintf("%d", from.Unix())},
			"end":   {fmt.Sprintf("%d", to.Unix())},
			"step":  {fmt.Sprintf("%d", step)},
		}
	}
	inSeries, err := s.doQuery(ctx, c, "/api/v1/query_range",
		params(summaryNetQuery("receive")))
	if err != nil {
		return nil, err
	}
	outSeries, err := s.doQuery(ctx, c, "/api/v1/query_range",
		params(summaryNetQuery("transmit")))
	if err != nil {
		return nil, err
	}
	byBucket := map[int64]*NetTrendPoint{}
	collect := func(series []promSeries, set func(*NetTrendPoint, float64)) {
		for _, ser := range series {
			for _, pair := range ser.Values {
				v, ts, ok := samplePair(pair)
				if !ok {
					continue
				}
				b := ts - ts%int64(step)
				tp := byBucket[b]
				if tp == nil {
					tp = &NetTrendPoint{Bucket: b}
					byBucket[b] = tp
				}
				set(tp, v)
			}
		}
	}
	collect(inSeries, func(tp *NetTrendPoint, v float64) { tp.InBps = v })
	collect(outSeries, func(tp *NetTrendPoint, v float64) { tp.OutBps = v })
	out := make([]NetTrendPoint, 0, len(byBucket))
	for _, tp := range byBucket {
		out = append(out, *tp)
	}
	sort.Slice(out, func(i, j int) bool { return out[i].Bucket < out[j].Bucket })
	return out, nil
}

// maxTrendSeries — multi-pod grafikte seri tavanı. v0.9.21: 10→8 —
// MultiLineChart foldTopN(n=8) 9-10. serileri "other"a katlıyordu,
// "Top 10 of N" başlığı grafikle çelişiyordu (self-review); tavan
// grafiğin gerçekte gösterdiği sayıya sabitlendi.
const maxTrendSeries = 8

// maxPodTrendSeries — v0.9.539. POD bazlı grafiklerde ayrı, YÜKSEK
// tavan (operator-reported: "17 pod var ama 7 tane gösteriyor").
// OTel tarafı aynı şikâyetle v0.9.95'te 8→40 çıkmıştı (RuntimeCharts
// FANOUT_MAX); Thanos tarafı geride kalmıştı — iki yüzey aynı soruyu
// ("hangi pod sıcak") cevaplıyor, tavanları ayrışmamalı.
//
// maxTrendSeries=8 node/route grafikleri için AYNEN kalır: oralarda
// seri sayısı doğal olarak düşük ve foldTopN(8) sözleşmesi geçerli.
const maxPodTrendSeries = 40

// NamespacePodsTrend — namespace'in pod başına dakika-bucket
// trendleri (v0.9.3). Sorgu topk'siz (adım-başına set kayması
// kırar — promql.go notu); top-10 seçimi ortalama CPU'ya göre
// Go'da, cpu+mem AYNI pod setine filtrelenir. İkinci dönüş: kesme
// öncesi toplam pod sayısı ("top 10 of N" etiketi için).
// mdp (v0.10.287, chart audit D2) — istemci piksel bütçesi; 0 = merdiven.
func (s *Service) NamespacePodsTrend(ctx context.Context, c ClusterConfig, namespace string, from, to time.Time, mdp int) ([]PodSeriesTrend, int, error) {
	// v0.9.26 — adaptif step, TABAN 15s; bucket rounding da bu
	// step'e bağlanır (aksi halde 60s yuvarlaması saniye-altı
	// çözünürlüğü çöpe atardı).
	step := stepForWindowMDP(from, to, mdp)
	params := func(q string) url.Values {
		return url.Values{
			"query": {q},
			"start": {fmt.Sprintf("%d", from.Unix())},
			"end":   {fmt.Sprintf("%d", to.Unix())},
			"step":  {fmt.Sprintf("%d", step)},
		}
	}
	cpuSeries, err := s.doQuery(ctx, c, "/api/v1/query_range",
		params(nsPodsCPUTrendQuery(namespace)))
	if err != nil {
		return nil, 0, err
	}
	memSeries, err := s.doQuery(ctx, c, "/api/v1/query_range",
		params(nsPodsMemTrendQuery(namespace)))
	if err != nil {
		return nil, 0, err
	}

	type podAcc struct {
		byBucket map[int64]*TrendPoint
		cpuSum   float64
		cpuN     int
	}
	byPod := map[string]*podAcc{}
	get := func(pod string) *podAcc {
		a := byPod[pod]
		if a == nil {
			a = &podAcc{byBucket: map[int64]*TrendPoint{}}
			byPod[pod] = a
		}
		return a
	}
	point := func(a *podAcc, ts int64) *TrendPoint {
		b := ts - ts%int64(step)
		tp := a.byBucket[b]
		if tp == nil {
			tp = &TrendPoint{Bucket: b}
			a.byBucket[b] = tp
		}
		return tp
	}
	for _, ser := range cpuSeries {
		a := get(ser.Metric["pod"])
		for _, pair := range ser.Values {
			if v, ts, ok := samplePair(pair); ok {
				point(a, ts).CPUCores = v
				a.cpuSum += v
				a.cpuN++
			}
		}
	}
	for _, ser := range memSeries {
		a := get(ser.Metric["pod"])
		for _, pair := range ser.Values {
			if v, ts, ok := samplePair(pair); ok {
				point(a, ts).MemBytes = v
			}
		}
	}

	// Ortalama CPU'ya göre sırala, top-N kes (deterministik: eşitlikte
	// pod adı asc).
	type ranked struct {
		pod  string
		mean float64
	}
	all := make([]ranked, 0, len(byPod))
	for pod, a := range byPod {
		if pod == "" {
			continue
		}
		mean := 0.0
		if a.cpuN > 0 {
			mean = a.cpuSum / float64(a.cpuN)
		}
		all = append(all, ranked{pod, mean})
	}
	sort.Slice(all, func(i, j int) bool {
		if all[i].mean != all[j].mean {
			return all[i].mean > all[j].mean
		}
		return all[i].pod < all[j].pod
	})
	total := len(all)
	if len(all) > maxTrendSeries {
		all = all[:maxTrendSeries]
	}

	out := make([]PodSeriesTrend, 0, len(all))
	for _, r := range all {
		a := byPod[r.pod]
		trend := make([]TrendPoint, 0, len(a.byBucket))
		for _, tp := range a.byBucket {
			trend = append(trend, *tp)
		}
		sortTrend(trend)
		out = append(out, PodSeriesTrend{Pod: r.pod, Trend: trend})
	}
	return out, total, nil
}

// stepForWindow — Thanos range-query step'i (v0.9.26): pencere
// genişledikçe kabalaşan adaptif merdiven, TABAN 15s. 15s, OpenShift
// user-workload-monitoring'in TİPİK scrape interval'i — altına inmek
// Prometheus'un örneklemediği noktalar için interpolasyon/tekrar
// üretir, o yüzden taban. Bu bir VARSAYIM: 30s-scrape'li bir cluster'da
// 15s step gereksiz interpolasyona yol açar (Thanos scrape interval'ini
// sorgu-anında güvenilir vermediğinden per-cluster doğrulama yok;
// gerekirse ClusterConfig'e opsiyonel scrapeIntervalSec alanı eklenir).
// ClickHouse span-metrik 10s tier'ıyla KARIŞTIRILMAZ — ayrı dünya.
// Nokta bütçesi ≤~360/seri. v0.9.1370'e kadar tüm trend uçları
// ≤6h clamp'liydi, yani 24h ve 7g basamakları ERİŞİLEMEZDİ; tavan
// artık 24h (clampThanosWindow) ve 24h basamağı CANLI. 7g basamağı
// hâlâ erişilmez — tavan orada bilinçli duruyor (ham örnek taraması
// ölçülmedi).
//
//	≤1h→15s(240) · ≤3h→30s(360) · ≤6h→60s(360) · ≤24h→300s(288)
//	· ≤7d→1800s(336) · else→3600s.
//
// TrendMaxDataPointsRungs — v0.10.287 (chart audit D2 / Dilim 1.6):
// istemcinin piksel bütçesi (`?maxDataPoints=`) bu basamaklara snap
// edilir; basamak = sınırlı cache-key kardinalitesi (v0.5.187 kuralı).
// 480 = merdivenin bugünkü tavanı (bütçesiz istemci aynı seriyi görür).
// FE karşılığı lib/chartStep.ts thanosMaxDataPoints — route_pins_test
// iki listeyi çiviler.
var TrendMaxDataPointsRungs = []int{120, 240, 480}

// TrendMaxDataPointsRung — istenen bütçeyi basamağa yuvarlar (yukarı);
// 0/negatif/aşırı → 480.
func TrendMaxDataPointsRung(want int) int {
	if want <= 0 {
		return 480
	}
	for _, r := range TrendMaxDataPointsRungs {
		if want <= r {
			return r
		}
	}
	return 480
}

// stepRungs — bütçe kabalaşma basamakları (saniye): merdivenin adımları +
// aralarına 120/600/900 (300→1800 sıçraması 288 noktayı 48'e düşürürdü;
// ara basamaklar bütçeyi aşmayan EN İNCE adımı verir). >3600 dinamik saat
// katları.
var stepRungs = []int{15, 30, 60, 120, 300, 600, 900, 1800, 3600}

// stepForWindowMDP — merdiven adımı, ama nokta sayısı mdp'yi AŞMAZ:
// merdiven adımından başlayıp span/adım ≤ mdp sağlanana dek kabalaşır
// (asla merdivenden ince değil — 15 s taban scrape aralığı varsayımı).
// mdp ≤ 0 → merdiven aynen. Saf, tablo-testli.
func stepForWindowMDP(from, to time.Time, mdp int) int {
	step := stepForWindow(from, to)
	if mdp <= 0 {
		return step
	}
	span := int(to.Sub(from).Seconds())
	if span <= 0 {
		return step
	}
	if span/step <= mdp {
		return step
	}
	for _, r := range stepRungs {
		if r <= step {
			continue
		}
		if span/r <= mdp {
			return r
		}
	}
	// >3600: saat katı, tam sayı aritmetiği.
	mult := (span + mdp*3600 - 1) / (mdp * 3600)
	if mult < 1 {
		mult = 1
	}
	return mult * 3600
}

func stepForWindow(from, to time.Time) int {
	span := to.Sub(from).Seconds()
	switch {
	case span <= 3600:
		return 15
	case span <= 3*3600:
		return 30
	case span <= 6*3600:
		return 60
	case span <= 24*3600:
		return 300
	case span <= 7*24*3600:
		return 1800
	default:
		// >7g: bütçeyi (≤480 nokta) GARANTİLE — sabit 3600s 30g'de
		// 720 nokta patlatırdı (ClickHouse audit "Delik 2"). Saat
		// katına yuvarlanmış dinamik step; tam sayı aritmetiği.
		const budget = 480
		mult := (int(span) + budget*3600 - 1) / (budget * 3600)
		return mult * 3600
	}
}

// rangeTrend — iki range-query'yi (cpu, mem) dakika bucket'larında
// birleştiren ortak yol; Pod/NamespaceTrend'in tek gövdesi.
func (s *Service) rangeTrend(ctx context.Context, c ClusterConfig, cpuQ, memQ string, from, to time.Time) ([]TrendPoint, error) {
	// v0.9.26 — adaptif step, TABAN 15s; bucket rounding da bu
	// step'e bağlanır (aksi halde 60s yuvarlaması saniye-altı
	// çözünürlüğü çöpe atardı).
	step := stepForWindow(from, to)
	params := func(q string) url.Values {
		return url.Values{
			"query": {q},
			"start": {fmt.Sprintf("%d", from.Unix())},
			"end":   {fmt.Sprintf("%d", to.Unix())},
			"step":  {fmt.Sprintf("%d", step)},
		}
	}
	cpuSeries, err := s.doQuery(ctx, c, "/api/v1/query_range", params(cpuQ))
	if err != nil {
		return nil, err
	}
	memSeries, err := s.doQuery(ctx, c, "/api/v1/query_range", params(memQ))
	if err != nil {
		return nil, err
	}
	byBucket := map[int64]*TrendPoint{}
	collect := func(series []promSeries, set func(*TrendPoint, float64)) {
		for _, ser := range series {
			for _, pair := range ser.Values {
				v, ts, ok := samplePair(pair)
				if !ok {
					continue
				}
				b := ts - ts%int64(step)
				tp := byBucket[b]
				if tp == nil {
					tp = &TrendPoint{Bucket: b}
					byBucket[b] = tp
				}
				set(tp, v)
			}
		}
	}
	collect(cpuSeries, func(tp *TrendPoint, v float64) { tp.CPUCores = v })
	collect(memSeries, func(tp *TrendPoint, v float64) { tp.MemBytes = v })
	out := make([]TrendPoint, 0, len(byBucket))
	for _, tp := range byBucket {
		out = append(out, *tp)
	}
	sortTrend(out)
	return out, nil
}

func clampPct(v float64) float64 {
	if v < 0 {
		return 0
	}
	if v > 100 {
		return 100
	}
	return v
}

func sortTrend(t []TrendPoint) {
	for i := 1; i < len(t); i++ {
		for j := i; j > 0 && t[j].Bucket < t[j-1].Bucket; j-- {
			t[j], t[j-1] = t[j-1], t[j]
		}
	}
}
