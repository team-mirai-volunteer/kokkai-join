# 国会議事録Deep Research システム設計書

## 1. 概要

ChatGPTのDeep Research機能を参考に、国会議事録データ（PostgreSQLダンプ）を対象とした高精度なRAG（Retrieval-Augmented Generation）検索システムを構築する。

### 目的
- 国会議事録に特化したDeep Research機能を実現
- 正確な出典URL付きで信頼性の高い回答を提供
- 将来的なWeb検索拡張に対応した拡張可能な設計

## 2. システムアーキテクチャ

### 2.1 Deep Research 4層アーキテクチャ

GPT5の分析結果を参考に、以下の4層構造を採用：

```
1. Planner（計画係）
   └── 質問をサブクエリに分解
   └── 国会議事録特化のエンティティ抽出
   └── 検索戦略の決定

2. Searcher（探索係）  
   ├── Vector Search（セマンティック検索）
   ├── Structured Search（SQL構造化検索）
   ├── Statistical Analysis（統計分析）
   └── Web Search（将来拡張用）

3. Synthesizer（統合係）
   └── 検索結果の統合・分析
   └── 出典URL付きレポート生成
   └── 対立意見の抽出

4. Critic（検証係）
   └── ファクトチェック
   └── 信頼度評価
   └── 追加調査の必要性判定
```

### 2.2 技術スタック

**基盤技術**
- Deno (TypeScriptネイティブサポート)
- LlamaIndex.TS (npm:llamaindex)
- PostgreSQL + pgvector
- Docker Compose
- Ollama (ローカルLLMランタイム)

**LLMモデル仕様**
- **埋め込み**: BGE-M3 (1024次元, 多言語対応)
- **チャット**: GPT-OSS 20B (日本語対応)
- **必要VRAM**: 約14GB (BGE-M3: 2GB + GPT-OSS: 12GB)
- **推奨環境**: M3 Ultra Mac (96GB RAM)

**データベース構成**
- 議事録データ: 1,184,779件の発言
- 会議データ: 10,997件
- 議員マスター: 5,412件
- 政党履歴: 2,944件

## 3. データベース設計

### 3.1 既存スキーマ（実装済み ✅）

```sql
-- 主要テーブル
"Meeting"           -- 会議録基本情報
"Speech"            -- 発言データ  
"Speaker"           -- 議員マスター
"SpeakerAffiliation" -- 所属履歴
"PartyGroup"        -- 政党マスター
"Position"          -- 役職マスター
"SpeakerRole"       -- 役割マスター
```

### 3.2 MVPベクトルストア（PGVectorStore）

```typescript
// LlamaIndex PGVectorStore設定（MVP）
const vectorStore = new PGVectorStore({
  connectionString: process.env.DATABASE_URL!,
  tableName: "kokkai_vectors",        // 国会議事録用テーブル名
  dimension: 1024,                    // BGE-M3 embedding model
  schemaName: "public"
});

// Documentのメタデータ構造例
const document = new Document({
  text: speechChunk,                  // チャンクされた発言テキスト
  metadata: {
    speechId: "121715254X02320250530_001",
    speaker: "岸田文雄",
    party: "自民党",
    date: "2025-05-30",
    meeting: "本会議",
    speechUrl: "https://kokkai.ndl.go.jp/txt/121715254X02320250530/1",
    chunkIndex: 0
  }
});
```


### 3.4 MVPデータ投入・検索フロー

#### **データ投入フロー（バッチ処理）**
```
1. Speech テーブルから発言データ取得
   ↓
2. Speaker/Meeting情報と結合してメタデータ作成  
   ↓
3. LlamaIndex でチャンク分割（デフォルト設定使用）
   ↓
4. Ollama BGE-M3 で埋め込みベクトル生成
   ↓
5. PGVectorStore.add() で kokkai_vectors テーブルに保存
```

#### **3.4.1 ベクトル化バッチスクリプト設計**

**専用スクリプト**: `backend/scripts/embed-speeches.ts`
```typescript
class SpeechEmbeddingBatch {
  private ollamaEmbedding: OllamaEmbedding;
  private pgStore: PGVectorStore;
  private dbPool: Pool;
  
  async processBatch(batchSize: number = 100): Promise<void>
  async createDocumentFromSpeech(speech: Speech): Promise<Document>
  async monitorProgress(): void
}
```

**実行手順**:
```bash
# Ollamaサーバー起動
ollama serve

# BGE-M3確認
ollama list | grep bge-m3

# バッチ実行
deno run --allow-all backend/scripts/embed-speeches.ts
```

#### **検索フロー（リアルタイム）**
```
1. ユーザー質問受信
   ↓
2. エンティティ抽出（議員名・日付等）
   ↓
3. PGVectorStore.similaritySearch() でセマンティック検索
   ↓ 
4. 必要に応じてメタデータフィルタ適用
   ↓
5. 検索結果を4層アーキテクチャで統合・分析
```

### 3.5 PGVectorStore採用理由

**採用理由**:
- LlamaIndexの標準機能で開発速度向上
- Document.metadata で議員・政党・日付情報を保存可能
- 汎用チャンキングでも国会議事録検索は十分実用的
- Ollama BGE-M3との組み合わせで高精度検索が可能

## 4. URL構成パターン（確認済み ✅）

国会議事録へのリンク構成：
```
https://kokkai.ndl.go.jp/txt/{Meeting.issueID}/{Speech.speechOrder}
```

例：
- Meeting.issueID: `121715254X02320250530`
- Speech.speechOrder: `0`
- URL: `https://kokkai.ndl.go.jp/txt/121715254X02320250530/0`

## 5. 検索戦略設計

### 5.1 Strategy Pattern（拡張対応設計）

```typescript
interface SearchStrategy {
  name: string;
  enabled: boolean;
  execute(query: string, entities: KokkaiEntities): Promise<SearchResult[]>;
}

// 実装予定戦略
- VectorSearchStrategy    (セマンティック検索)
- StructuredSearchStrategy (SQL構造化検索) 
- StatisticalAnalysisStrategy (統計分析)
- WebSearchStrategy       (将来拡張用)
```

### 5.2 エンティティ抽出

国会議事録特化の情報抽出：
```typescript
interface KokkaiEntities {
  speakers?: string[];      // 議員名
  parties?: string[];       // 政党名  
  dateRange?: {             // 期間
    start: string;
    end: string;
  };
  meetings?: string[];      // 会議名
  topics?: string[];        // 議題・キーワード
}
```

## 6. 実装アーキテクチャ

### 6.1 メインクラス設計

```typescript
class KokkaiDeepResearch {
  private pgStore: PGVectorStore;
  private dbPool: Pool;
  private strategies: Map<string, SearchStrategy>;
  private ollamaEmbedding: OllamaEmbedding;
  private ollamaChat: Ollama;
  
  constructor() {
    // Ollama初期化
    this.ollamaEmbedding = new OllamaEmbedding({
      model: "bge-m3",
      baseURL: process.env.OLLAMA_BASE_URL || "http://localhost:11434"
    });
    
    this.ollamaChat = new Ollama({
      model: "gpt-oss:20b", 
      baseURL: process.env.OLLAMA_BASE_URL || "http://localhost:11434"
    });
  }

  // 1. Planner
  async planKokkaiQuery(question: string): Promise<QueryPlan>
  
  // 2. Searcher  
  async searchMultiSource(plan: QueryPlan): Promise<SearchResult[]>
  
  // 3. Synthesizer
  async synthesizeWithSources(question: string, results: SearchResult[]): Promise<string>
  
  // 4. Critic
  async critique(answer: string): Promise<string[]>
  
  // メイン実行
  async deepResearch(question: string): Promise<KokkaiResearchResult>
}
```

### 6.2 レスポンス形式

```typescript
interface KokkaiResearchResult {
  question: string;
  report: string;              // 分析結果
  sources: Array<{
    speaker: string;           // 発言者
    party: string;            // 政党
    date: string;             // 日付  
    meeting: string;          // 会議名
    url: string;              // 出典URL
  }>;
  confidence: number;          // 信頼度
  processingTimeMs: number;    // 処理時間
  dataStats: {
    totalResults: number;      // 検索結果数
    uniqueSpeakers: number;    // ユニーク発言者数
    dateRange: {               // 対象期間
      start: string;
      end: string;
    };
  };
}
```

## 7. 特徴・優位性

### 7.1 ChatGPT Deep Researchとの比較

| 項目 | ChatGPT | 本システム |
|------|---------|------------|
| データソース | Web全般 | 国会議事録特化 |
| 正確性 | Web情報に依存 | 公式議事録ベース |
| 出典 | URL + 要約 | 正確なURL + メタデータ |
| 検索精度 | 汎用 | 構造化データ活用 |
| 処理時間 | 5-30分 | 1-5分（推定）|

### 7.2 技術的優位性

**ハイブリッド検索**
- セマンティック検索（ベクトル）
- 構造化検索（SQL）
- 統計分析
- 将来のWeb検索統合

**データ品質**
- ACID特性によるデータ一貫性
- 正規化されたリレーショナル構造
- 議員の政党変遷追跡
- 表記揺れ統一

**スケーラビリティ**
- PostgreSQL + pgvectorの高性能
- インデックス最適化
- 並列検索処理

## 8. セキュリティ・制限事項

### 8.1 セキュリティ
- データベース接続の暗号化
- SQLインジェクション対策
- 入力値検証・サニタイジング
- Ollamaローカル通信のセキュリティ
- モデルファイルの整合性確認

### 8.2 制限事項
- 国会議事録に限定（意図的制限）
- リアルタイム更新は別途要検討
- 大量同時アクセス時の負荷分散
- **ローカルLLM制限事項**:
  - Ollama起動が前提条件
  - モデル切り替えに時間要
  - 単一マシン処理のため同時実行制限
  - ハードウェアスペック依存

## 9. 将来拡張

### 9.1 Web検索統合
- Tavily API等による補助的Web検索
- 信頼度による情報源の重み付け
- 国会議事録 vs Web情報の区別表示

### 9.2 機能拡張
- 時系列分析（議員発言の変遷）
- 政党間比較分析
- 議題別トレンド分析
- 音声・動画データ連携

### 9.3 UI/UX
- フロントエンド（Next.js）
- リアルタイム検索進捗表示
- インタラクティブな出典表示
- 発言者・政党フィルタ機能

## 10. データ構造定義 (TypeScript)

### 10.1 国会議事録エンティティ

```typescript
interface KokkaiEntities {
  speakers?: string[];      // 議員名 (例: ["岸田文雄", "枝野幸男"])
  parties?: string[];       // 政党名 (例: ["自民党", "立憲民主党"])
  dateRange?: {             // 期間指定
    start: string;          // ISO日付文字列 "2024-01-01"
    end: string;            // ISO日付文字列 "2024-12-31"
  };
  meetings?: string[];      // 会議名 (例: ["予算委員会", "法務委員会"])
  topics?: string[];        // 議題・キーワード (例: ["防衛費", "子育て支援"])
  positions?: string[];     // 役職 (例: ["総理大臣", "外務大臣"])
}
```

### 10.2 クエリプラン

```typescript
interface QueryPlan {
  originalQuestion: string;     // 元の質問
  subqueries: string[];         // 分解されたサブクエリ
  entities: KokkaiEntities;     // 抽出されたエンティティ
  enabledStrategies: string[];  // 使用する検索戦略 ["vector", "structured", "statistical"]
  confidence: number;           // プラン信頼度 (0-1)
  estimatedComplexity: number;  // 処理複雑度予測 (1-5)
}
```

### 10.3 検索結果

```typescript
interface SearchResult {
  content: string;              // 検索でヒットしたテキスト
  score: number;               // 関連度スコア (0-1)
  metadata: SearchMetadata;    // メタデータ
  strategy: string;            // 検索戦略名
}

interface SearchMetadata {
  source: string;              // "kokkai_db" | "web" | "statistical"
  speechId?: string;           // Speech.id
  speechUrl?: string;          // 出典URL
  speaker?: string;            // 発言者名
  party?: string;              // 政党名
  meeting?: string;            // 会議名
  date?: string;               // 発言日（ISO形式）
  issueId?: string;            // Meeting.issueID
  chunkIndex?: number;         // チャンク番号（ベクトル検索時）
  confidence?: number;         // この結果の信頼度
}
```

### 10.4 検索戦略インターフェース

```typescript
interface SearchStrategy {
  name: string;                // 戦略名
  enabled: boolean;            // 有効/無効
  priority: number;            // 優先度 (1-10)
  execute(
    query: string, 
    entities: KokkaiEntities,
    options?: SearchOptions
  ): Promise<SearchResult[]>;
}

interface SearchOptions {
  maxResults?: number;         // 最大結果数 (デフォルト: 20)
  minScore?: number;           // 最小スコア閾値 (デフォルト: 0.1)
  timeoutMs?: number;          // タイムアウト (デフォルト: 30000)
}
```

### 10.5 最終結果レスポンス

```typescript
interface KokkaiResearchResult {
  question: string;            // 元の質問
  report: string;              // 分析レポート（マークダウン形式）
  sources: SourceReference[];  // 出典リスト
  confidence: number;          // 全体信頼度 (0-1)
  processingTimeMs: number;    // 処理時間
  rounds: number;              // 実行ラウンド数
  dataStats: DataStatistics;   // データ統計
  warnings?: string[];         // 警告メッセージ
}

interface SourceReference {
  speaker: string;             // 発言者名
  party: string;               // 政党名
  date: string;                // 発言日
  meeting: string;             // 会議名
  url: string;                 // 出典URL
  relevanceScore: number;      // 関連度
  excerpt: string;             // 抜粋テキスト
}

interface DataStatistics {
  totalResults: number;        // 総検索結果数
  uniqueSpeakers: number;      // ユニーク発言者数
  uniqueMeetings: number;      // ユニーク会議数
  dateRange: {                 // 実際に検索された期間
    start: string;
    end: string;
  };
  strategyBreakdown: Record<string, number>;  // 戦略別結果数
}
```

### 10.6 設定・オプション

```typescript
interface DeepResearchOptions {
  maxRounds?: number;          // 最大反復回数 (デフォルト: 3)
  maxSources?: number;         // 最大出典数 (デフォルト: 20)
  enabledStrategies?: string[]; // 有効な検索戦略
  llmModel?: string;           // 使用するLLMモデル
  embeddingModel?: string;     // 使用する埋め込みモデル
  language?: string;           // 言語設定 ("ja" | "en")
  verbose?: boolean;           // 詳細ログ出力
}

interface ChunkingOptions {
  chunkSize?: number;          // チャンクサイズ（文字数、デフォルト: 1000）
  chunkOverlap?: number;       // オーバーラップサイズ（デフォルト: 200）
  preserveStructure?: boolean; // 文章構造保持（デフォルト: true）
}
```

### 10.7 Denoインポート例

```typescript
// メインライブラリ
import { VectorStoreIndex, Settings } from "npm:llamaindex";
import { Ollama, OllamaEmbedding } from "npm:@llamaindex/ollama";
import { PGVectorStore } from "npm:@llamaindex/community";

// データベース
import { Pool } from "npm:pg";

// ユーティリティ
import { TinySegmenter } from "npm:tiny-segmenter";

// 標準ライブラリ（JSR）
import { serve } from "jsr:@std/http/server";
import { load } from "jsr:@std/dotenv";
```

### 10.8 JSR セットアップ

**プロジェクト初期化**
```bash
# deno.jsonにJSRパッケージを追加
deno add jsr:@std/dotenv
deno add jsr:@std/http
```

**deno.json 例**
```json
{
  "imports": {
    "@std/dotenv": "jsr:@std/dotenv@^0.225.5",
    "@std/http": "jsr:@std/http@^0.224.0"
  },
  "tasks": {
    "dev": "deno run --allow-net --allow-env --allow-read --watch main.ts"
  }
}
```

### 10.9 Ollama設定

**ローカルLLMモデル構成**
```typescript
// 埋め込みモデル: BGE-M3 (1024次元)
Settings.embedModel = new OllamaEmbedding({
  model: "bge-m3",
  baseURL: "http://localhost:11434"
});

// チャットモデル: GPT-OSS 20B
Settings.llm = new Ollama({
  model: "gpt-oss:20b",
  baseURL: "http://localhost:11434"
});
```

**Ollamaモデルダウンロード**
```bash
# BGE-M3埋め込みモデル
ollama pull bge-m3

# GPT-OSS 20Bチャットモデル  
ollama pull gpt-oss:20b

# モデル一覧確認
ollama list
```

**M3 Ultra Mac推奨設定**
- RAM: 96GB（十分な容量）
- BGE-M3: 約2GB VRAM使用
- GPT-OSS:20B: 約12GB VRAM使用
- 同時実行可能で高速処理

## 11. ベクトル化実装詳細

### 11.1 事前準備スクリプト
**ファイル**: `backend/scripts/embed-speeches.ts`
**目的**: 既存1,184,779件の発言データを BGE-M3 でベクトル化

### 11.2 実装ステップ
1. Speechテーブル全件取得（バッチサイズ: 100件）
2. 関連テーブル結合（Speaker, Meeting, PartyGroup）
3. チャンク分割（LlamaIndex標準, 1000文字/チャンク）
4. BGE-M3埋め込み生成（Ollama API経由）
5. PGVectorStore保存（kokkai_vectorsテーブル）
6. 進捗表示・エラーハンドリング

### 11.3 性能見積もり
- **処理速度**: 約10件/秒（M3 Ultra）
- **総処理時間**: 約33時間（1,184,779件 ÷ 10）
- **必要ディスク**: 約50GB（ベクトルデータ + インデックス）
