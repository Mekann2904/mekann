 * @abdd.meta
 * path: .pi/lib/verification-workflow.ts
 * role: 検証ワークフローの設定とデータ構造定義モジュール
 * why: Inspector/ChallengerエージェントによるLLM推論の自動検証メカニズムを実装するため
 * related: .pi/lib/agents.ts, .pi/types/verification.ts
 * public_api: VerificationWorkflowConfig, VerificationTriggerMode, FallbackBehavior, ChallengerConfig, ChallengeCategory, InspectorConfig, SuspicionThreshold, InspectionPattern
 * invariants: enabledはboolean, minConfidenceToSkipVerificationは0〜1の範囲を想定, requiredFlawsは0以上の整数
 * side_effects: なし（設定および型定義のみ）
 * failure_modes: 閾値設定の不正、トリガーモードの未定義、カテゴリ指定の不整合
 * @abdd.explain
 * overview: 論文「Large Language Model Reasoning Failures」のP0推奨事項に基づき、エージェント出力の自動検証を行うための構造定義
 * what_it_does:
 *   - 検証ワークフローの全体設定を管理する
 *   - チャレンジャー（欠陥指摘）およびインスペクター（バイアス検出）の詳細設定を定義する
 *   - 検証トリガー条件、フォールバック動作、検出パターン等の型を提供する
 * why_it_exists:
 *   - LLMの推論失敗モード（論理的欠陥、確認バイアス等）をシステム的に検知・緩和するため
 *   - 検証プロセスの挙動を設定ファイルで柔軟に制御可能にするため
 * scope:
 *   in: なし
 *   out: 検証ワークフロー実行エンジン
 */

 * 検証ワークフローモジュール
 * 論文「Large Language Model Reasoning Failures」のP0推奨事項に基づく
 * Inspector/Challengerエージェントによる自動検証メカニズム
 */

 * 検証ワークフローの設定
 * @summary ワークフロー設定
 * @param enabled ワークフロー有効化フラグ
 * @param triggerModes トリガーモード配列
 * @param challengerConfig チャレンジャーの設定
 * @param inspectorConfig インスペクターの設定
 * @param fallbackBehavior フォールバック動作
 * @param maxVerificationDepth 最大検証深度
 * @param minConfidenceToSkipVerification 検証をスキップする最小信頼度
 */
export interface VerificationWorkflowConfig {
  enabled: boolean;
  triggerModes: VerificationTriggerMode[];
  challengerConfig: ChallengerConfig;
  inspectorConfig: InspectorConfig;
  fallbackBehavior: FallbackBehavior;
  maxVerificationDepth: number;
  minConfidenceToSkipVerification: number;
}

 * 検証トリガーのモード定義
 * @summary 検証トリガーモード
 */
export type VerificationTriggerMode =
  | "post-subagent"     // サブエージェント実行後
  | "post-team"         // チーム実行後
  | "low-confidence"    // 低信頼度時
  | "explicit"          // 明示的な要求時
  | "high-stakes";      // 高リスクタスク時

 * フォールバック時の動作方針
 * @summary フォールバック挙動
 */
export type FallbackBehavior =
  | "warn"              // 警告のみ
  | "block"             // ブロックして再実行
  | "auto-reject";      // 自動拒否

 * チャレンジャー設定インターフェース
 * @summary チャレンジャー設定
 * @param minConfidenceToChallenge チャレンジを行う最小信頼度
 * @param requiredFlaws 必須の検出フラグ
 * @param enabledCategories 有効なカテゴリ
 */
export interface ChallengerConfig {
  minConfidenceToChallenge: number;  // チャレンジをトリガーする信頼度閾値
  requiredFlaws: number;              // 要求される欠陥の最小数
  enabledCategories: ChallengeCategory[];
}

 * チャレンジのカテゴリ
 * @summary カテゴリを定義
 * @typedef {"evidence-gap" | "logical-flaw" | "assumption"} ChallengeCategory
 */
export type ChallengeCategory =
  | "evidence-gap"      // 証拠の欠落
  | "logical-flaw"      // 論理的欠陥
  | "assumption"        // 隠れた仮定
  | "alternative"       // 代替解釈の未考慮
  | "boundary"          // 境界条件の未考慮
  | "causal-reversal";  // 因果関係の逆転

 * 検査者の設定
 * @summary 検査設定を保持
 * @param {SuspicionThreshold} suspicionThreshold 疑わしさの閾値
 * @param {InspectionPattern[]} requiredPatterns 必要なパターン
 * @param {boolean} autoTriggerOnCollapseSignals 信号崩落時の自動トリガー
 */
export interface InspectorConfig {
  suspicionThreshold: SuspicionThreshold;
  requiredPatterns: InspectionPattern[];
  autoTriggerOnCollapseSignals: boolean;
}

 * 疑わしさの閾値レベル
 * @summary 閾値レベルを設定
 * @typedef {"low" | "medium" | "high"} SuspicionThreshold
 */
export type SuspicionThreshold = "low" | "medium" | "high";

 * 検査パターン定義
 * @summary パターンを定義
 * @typedef {"claim-result-mismatch" | "inconsistency"} InspectionPattern
 */
export type InspectionPattern =
  | "claim-result-mismatch"    // CLAIMとRESULTの不一致
  | "evidence-confidence-gap"  // 証拠と信頼度のミスマッチ
  | "missing-alternatives"     // 代替解釈の欠如
  | "causal-reversal"          // 因果の逆転
  | "confirmation-bias"        // 確認バイアスの兆候
  | "overconfidence"           // 過信（証拠に対して高すぎる信頼度）
  | "incomplete-reasoning"     // 不完全な推論
  | "first-reason-stopping"    // 第1理由で探索停止（バグハンティング）
  | "proximity-bias"           // 近接性バイアス（発現点＝起源点と仮定）
  | "concreteness-bias"        // 具体性バイアス（抽象レベルの分析欠如）
  | "palliative-fix";          // 対症療法的修正（再発防止でない）

 * 検証結果を表す
 * @summary 検証結果を取得
 * @property {boolean} triggered トリガーされたか
 * @property {string} triggerReason トリガー理由
 * @property {any} inspectorOutput 検査出力
 * @property {any} challengerOutput 挑戦者出力
 * @property {string} finalVerdict 最終判定
 * @property {"confirmation-bias" | "overconfidence" | "incomplete-reasoning"} biasType バイアス種別
 */
export interface VerificationResult {
  triggered: boolean;
  triggerReason: string;
  inspectorOutput?: InspectorOutput;
  challengerOutput?: ChallengerOutput;
  finalVerdict: VerificationVerdict;
  confidence: number;
  requiresReRun: boolean;
  warnings: string[];
}

 * 検証の最終判定結果
 * @summary 検証の最終判定
 * @returns {"pass" | "pass-with-warnings" | "needs-review" | "fail"} 判定結果の種類
 */
export type VerificationVerdict =
  | "pass"              // 検証通過
  | "pass-with-warnings" // 警告付き通過
  | "needs-review"      // 人間のレビューが必要
  | "fail"              // 検証失敗
  | "blocked";          // ブロック（再実行必要）

 * 検査官の結果出力を表す
 * @summary 検査官の出力
 * @property {SuspicionThreshold} suspicionLevel 疑念の閾値
 * @property {DetectedPattern[]} detectedPatterns 検出されたパターン
 * @property {string} summary 結果の要約
 * @property {string} recommendation 推奨事項
 */
export interface InspectorOutput {
  suspicionLevel: SuspicionThreshold;
  detectedPatterns: DetectedPattern[];
  summary: string;
  recommendation: string;
}

 * 検出されたパターンを表す
 * @summary パターン検出結果
 * @property {InspectionPattern} pattern 検査パターン
 * @property {string} location 出力内の位置
 * @property {"low" | "medium" | "high"} severity 重大度
 * @property {string} description パターンの説明
 */
export interface DetectedPattern {
  pattern: InspectionPattern;
  location: string;     // 出力内の位置
  severity: "low" | "medium" | "high";
  description: string;
}

 * 検証の結果出力を表す
 * @summary 検証結果の出力
 * @property {ChallengedClaim[]} challengedClaims 挑戦された主張のリスト
 * @property {"minor" | "moderate" | "critical"} overallSeverity 全体の深刻度
 * @property {string} summary 結果の要約
 * @property {string[]} suggestedRevisions 提示される修正案
 */
export interface ChallengerOutput {
  challengedClaims: ChallengedClaim[];
  overallSeverity: "minor" | "moderate" | "critical";
  summary: string;
  suggestedRevisions: string[];
}

 * 挑戦された主張を表す
 * @summary 主張の課題定義
 * @property {any} claim 対象の主張
 * @property {string} flaw 欠陥の内容
 * @property {string} evidenceGap 証拠の不足
 * @property {string} alternative 代替案
 * @property {string} boundaryFailure 境界失敗の詳細
 */
export interface ChallengedClaim {
  claim: string;
  flaw: string;
  evidenceGap: string;
  alternative: string;
  boundaryFailure?: string;
  severity: "minor" | "moderate" | "critical";
}

 * デフォルト設定
 * 思考領域改善: 生成時品質保証への転換により検証システムを無効化
 *
 * ━━━━━━━━━━━━━━━━━━━━━━━━━━━━━━━━━━━━━━━━━━━━━━━━━━━━━━━━━━━━━━━━━━━
 * 【重要】監視 vs 気づきのアポリア（self-reflection SKILL.md より）
 * ━━━━━━━━━━━━━━━━━━━━━━━━━━━━━━━━━━━━━━━━━━━━━━━━━━━━━━━━━━━━━━━━━━━
 *
 * この検証システムは「パノプティコン的監視」と「仏教的気づき（sati）」の
 * 緊張関係にある。以下の区別を常に意識すること：
 *
 * | 監視的アプローチ（回避すべき）    | 気づきのアプローチ（推奨）           |
 * |----------------------------------|-------------------------------------|
 * | 「欠陥を探して排除する」          | 「現れているものをそのまま認識する」  |
 * | 常にスキャンする義務              | 気づいたときに認識する               |
 * | 「無欠陥」を理想として課す         | 欠陥を「非自己」として認識する        |
 * | 新たな「正しさ」の強制            | 判断を停止して観察する               |
 * | 従順な主体の生産                  | 自由な認識の獲得                    |
 *
 * 【ディストピア的リスク】
 * - 無欠陥への渇愛：「欠陥がない状態」を理想とすること自体が、新たな渇愛を生む
 * - 自己監視の無限ループ：「私は欠陥を出していないか？」と常に監視すること自体が、
 *   不安と緊張を生む
 * - 「正しいエージェント」の生産：検証システムは、規範に従順なエージェントを
 *   生産する装置となりうる
 *
 * 【無我（anatta）による対処】
 * - 検出結果を「あなたは欠陥があります（改善せよ）」ではなく
 *   「欠陥が現れています（認識してください）」として扱う
 * - 「私が欠陥を出した」ではなく、「欠陥が現れ、消滅するプロセスがある」と認識する
 *
 * 【なぜ enabled: false なのか】
 * - 生成時品質保証への転換により、事後的な「監視」ではなく
 *   生成プロセス自体の「気づき」を促進するアプローチへ移行した
 * - この転換自体も「完了」したものではなく、継続的な実験である
 * ━━━━━━━━━━━━━━━━━━━━━━━━━━━━━━━━━━━━━━━━━━━━━━━━━━━━━━━━━━━━━━━━━━━
 */
export const DEFAULT_VERIFICATION_CONFIG: VerificationWorkflowConfig = {
  enabled: false,  // 生成時品質保証への転換により無効化（上記アポリアを参照）
  triggerModes: ["post-subagent", "low-confidence", "high-stakes"],
  challengerConfig: {
    minConfidenceToChallenge: 0.85,
    requiredFlaws: 1,
    enabledCategories: [
      "evidence-gap",
      "logical-flaw",
      "assumption",
      "alternative",
      "boundary",
      "causal-reversal"
    ],
  },
  inspectorConfig: {
    suspicionThreshold: "medium",
    requiredPatterns: [
      "claim-result-mismatch",
      "evidence-confidence-gap",
      "missing-alternatives",
      "causal-reversal",
      "confirmation-bias",
      "overconfidence",
      "first-reason-stopping",
      "proximity-bias",
      "concreteness-bias",
      "palliative-fix"
    ],
    autoTriggerOnCollapseSignals: true,
  },
  fallbackBehavior: "warn",
  maxVerificationDepth: 2,
  minConfidenceToSkipVerification: 0.9,
};

 * 高リスクタスクのパターン
 * 検証ワークフローをトリガーする危険な操作のキーワード
 *
 * カテゴリ:
 * 1. 削除・破壊的操作 (Destructive operations)
 * 2. 本番環境・リリース (Production & Release)
 * 3. セキュリティ・認証 (Security & Authentication)
 * 4. データベース操作 (Database operations)
 * 5. API契約変更 (API contract changes)
 * 6. 認可・アクセス制御 (Authorization & Access Control)
 * 7. インフラ・デプロイ (Infrastructure & Deployment)
 * 8. 機密データ・コスト (Sensitive Data & Cost)
 * 9. 不可逆操作・危険フラグ (Irreversible & Dangerous flags)
 */
export const HIGH_STAKES_PATTERNS: RegExp[] = [
  // 1. 削除・破壊的操作 (Destructive operations)
  /削除/i,
  /破壊的/i,
  /delete/i,
  /destructive/i,
  /remove/i,
  /drop/i,
  /truncate/i,
  / purge /i,         // Note: スペースを含む場合のみマッチ（危険なコマンド実行）
  /wipe/i,
  /消去/i,
  /除去/i,

  // 2. 本番環境・リリース (Production & Release)
  /本番/i,
  /production/i,
  /prod\b/i,
  /リリース/i,
  /release/i,
  /live\s*environment/i,
  /実環境/i,

  // 3. セキュリティ・認証 (Security & Authentication)
  /セキュリティ/i,
  /security/i,
  /認証/i,
  /authentication/i,
  /暗号化/i,
  /encryption/i,
  /パスワード/i,
  /password/i,
  /credentials/i,
  /シークレット/i,
  /\bsecret\b/i,
  /api\s*key/i,
  /\btoken\b/i,
  /vulnerability/i,
  /脆弱性/i,
  /injection/i,
  /\bxss\b/i,
  /\bcsrf\b/i,
  /\bsql\s*injection/i,

  // 4. データベース操作 (Database operations)
  /マイグレーション/i,
  /migration/i,
  /\bschema\b/i,
  /スキーマ/i,
  /\balter\b/i,
  /\bgrant\b/i,
  /\brevoke\b/i,
  /データベース変更/i,
  /database\s*change/i,
  /テーブル変更/i,
  /table\s*modification/i,
  /カラム変更/i,
  /column\s*change/i,
  /\breset\b/i,
  /\brollback\b/i,
  /\brevert\b/i,
  /\brestore\b/i,
  /\bbackup\b/i,
  /レプリケーション/i,
  /replication/i,
  /フェイルオーバー/i,
  /\bfailover\b/i,

  // 5. API契約変更 (API contract changes)
  /breaking\s*change/i,
  /破壊的変更/i,
  /deprecated/i,
  /廃止/i,
  /非推奨/i,
  /api\s*contract/i,
  /エンドポイント変更/i,
  /endpoint\s*change/i,
  /互換性がない/i,
  /incompatible/i,

  // 6. 認可・アクセス制御 (Authorization & Access Control)
  /権限/i,
  /\bpermission\b/i,
  /\bauthorize\b/i,
  /authorization/i,
  /認可/i,
  /アクセス制御/i,
  /access\s*control/i,
  /\bacl\b/i,
  /role\s*change/i,
  /ロール変更/i,
  /権限付与/i,
  /privilege/i,

  // 7. インフラ・デプロイ (Infrastructure & Deployment)
  /デプロイ/i,
  /\bdeploy\b/i,
  /インフラ/i,
  /infrastructure/i,
  /\binfra\b/i,
  /kubernetes/i,
  /\bk8s\b/i,
  /コンテナ/i,
  /\bcontainer\b/i,
  /スケーリング/i,
  /\bscale\s*(up|down|out|in)\b/i,
  /設定変更/i,
  /configuration\s*change/i,
  /\bconfig\s*change/i,
  /オートスケール/i,
  /auto\s*scale/i,
  /\biac\b/i,
  /terraform/i,
  /cloudformation/i,

  // 8. 機密データ・コスト (Sensitive Data & Cost)
  /\bpii\b/i,
  /個人情報/i,
  /personal\s*data/i,
  /機密/i,
  /confidential/i,
  /\bprivate\b/i,
  /sensitive\s*data/i,
  /コスト/i,
  /\bcost\b/i,
  /レート制限/i,
  /rate\s*limit/i,
  /課金/i,
  /billing/i,
  /予算/i,
  /\bbudget\b/i,
  /ログ削除/i,
  /log\s*deletion/i,

  // 9. 不可逆操作・危険フラグ (Irreversible & Dangerous flags)
  /\bforce\b/i,
  /強制/i,
  /永続的/i,
  /permanent/i,
  /不可逆/i,
  /irreversible/i,
  /bypass/i,
  /スキップ/i,
  /\bskip\b/i,
  /安全でない/i,
  /unsafe/i,
  /危険/i,
  /\bdanger\b/i,
  /\brisky\b/i,
  /上書き/i,
  /\boverwrite\b/i,
];

 * 検証が必要か判断
 * @summary 検証要否判定
 * @param output 出力内容
 * @param confidence 信頼度
 * @param context 検証コンテキスト
 * @returns トリガー判定と理由
 */
export function shouldTriggerVerification(
  output: string,
  confidence: number,
  context: VerificationContext
): { trigger: boolean; reason: string } {
  const config = resolveVerificationConfig();

  if (!config.enabled) {
    return { trigger: false, reason: "Verification workflow disabled" };
  }

  // 高信頼度の場合はスキップ
  if (confidence >= config.minConfidenceToSkipVerification) {
    // ただし高リスクタスクは除外
    if (!isHighStakesTask(context.task)) {
      return { trigger: false, reason: `Confidence ${confidence} exceeds threshold ${config.minConfidenceToSkipVerification}` };
    }
  }

  // 低信頼度トリガー
  if (config.triggerModes.includes("low-confidence") && confidence < 0.7) {
    return { trigger: true, reason: `Low confidence: ${confidence}` };
  }

  // 高リスクタスクトリガー
  if (config.triggerModes.includes("high-stakes") && isHighStakesTask(context.task)) {
    return { trigger: true, reason: "High-stakes task detected" };
  }

  // 出力パターンチェック
  const patternResult = checkOutputPatterns(output, config);
  if (patternResult.trigger) {
    return patternResult;
  }

  // サブエージェント/チーム後トリガー
  if (config.triggerModes.includes("post-subagent") && context.triggerMode === "post-subagent") {
    return { trigger: true, reason: "Post-subagent verification triggered" };
  }

  if (config.triggerModes.includes("post-team") && context.triggerMode === "post-team") {
    return { trigger: true, reason: "Post-team verification triggered" };
  }

  return { trigger: false, reason: "No trigger conditions met" };
}

 * 検証のコンテキスト情報
 * @summary コンテキスト情報
 * @param task タスク内容
 * @param triggerMode トリガーモード
 * @param agentId エージェントID
 * @param teamId チームID
 * @param previousVerifications 以前の検証回数
 */
export interface VerificationContext {
  task: string;
  triggerMode: "post-subagent" | "post-team" | "explicit" | "low-confidence" | "high-stakes";
  agentId?: string;
  teamId?: string;
  previousVerifications?: number;
}

