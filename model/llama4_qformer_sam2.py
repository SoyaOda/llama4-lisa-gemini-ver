# model/llama4_qformer_sam2.py
"""
LISA-Llama4-Scout + Q-Former + SAM2 統合モデル

moe_structure_approach.md提案A実装:
- Q-Former: VLMからタスク関連特徴を能動的抽出
- Llama-4-Scout: 高度な推論VLM (109B total, 17B active, MoE)
- SAM2: 高速・高精度セグメンテーション (6倍高速)

アーキテクチャの改善点:
1. 情報ボトルネック解消: MLPプロジェクター → Q-Former
2. MoE対応PEFT: 専門エキスパート育成
3. 段階的学習: インターフェース・フルスタック・専門化
"""

import torch
import torch.nn as nn
import torch.nn.functional as F
from typing import Optional, Tuple, Dict, Any, List
import math
import sys
import os

# プロジェクトルートをパスに追加
sys.path.insert(0, os.path.dirname(os.path.dirname(os.path.abspath(__file__))))

# SAM2リポジトリパスも追加
sam2_repo_path = os.path.join(os.path.dirname(os.path.dirname(os.path.abspath(__file__))), 'sam2_repo')
if sam2_repo_path not in sys.path:
    sys.path.insert(0, sam2_repo_path)

import config_linux

# 必要なコンポーネントのインポート
from model.qformer import get_qformer_model  # 🔄 公式/カスタム自動選択
from model.sam2_integration import get_sam2_wrapper
from model.losses_qformer_sam2 import get_composite_loss_qformer_sam2
from model.moe_adapters import create_heterogeneous_moe_adapter, HeterogeneousMoEAdapter  # 🆕 Phase 3A: MoE統合

try:
    # LISA準拠: CausalLMアーキテクチャを使用
    # Web調査結果: Llama4ForCausalLMは存在するが、バージョン依存の可能性
    from transformers import AutoModelForCausalLM, AutoProcessor
    
    # Llama4専用クラスの確認（存在する場合は使用）
    try:
        from transformers import Llama4ForCausalLM
        LLAMA4_MODEL_CLASS = Llama4ForCausalLM
        print("✅ Llama4ForCausalLM利用可能（LISA推奨）")
    except ImportError:
        # Llama4ForCausalLMが利用できない場合はAutoModelForCausalLMを使用
        LLAMA4_MODEL_CLASS = AutoModelForCausalLM
        print("⚠️ Llama4ForCausalLM未対応、AutoModelForCausalLM使用")
        print("💡 transformers>=4.45.0へのアップデートを推奨")
    
    LLAMA4_AVAILABLE = True
    print("✅ Llama-4-Scout CausalLMアーキテクチャ利用可能")
except ImportError as e:
    LLAMA4_AVAILABLE = False
    LLAMA4_MODEL_CLASS = None
    error_msg = f"❌ CausalLMモデルクラス import失敗: {e}"
    print(error_msg)
    print("❌ transformersライブラリが利用できません")
    # エラーを再発生させて処理を停止
    raise ImportError(error_msg)


class LlamaQFormerSAM2Config:
    """統合モデル設定クラス"""
    
    def __init__(self):
        # Llama-4-Scout設定（複数GPU環境）
        self.llama_model_id = config_linux.LLAMA_MODEL_ID
        self.llama_hidden_size = config_linux.LLAMA_HIDDEN_SIZE
        # 🔥 Webリサーチ最適化: カスタムGPU分散でGPU 0過負荷解決（2025年ベストプラクティス）
        num_gpus = torch.cuda.device_count()
        if num_gpus >= 8:
            # H100x8専用: GPU 0を大幅軽減、他GPUに分散
            self.max_memory = {
                0: "45GB",  # GPU 0: 57%軽減（58.9GB→45GB）
                1: "75GB",  # GPU 1-7: 増強（31.7GB→75GB）
                2: "75GB", 
                3: "75GB", 
                4: "75GB", 
                5: "75GB", 
                6: "75GB", 
                7: "70GB"   # GPU 7: 少し控えめ（lm_head用）
            }
            # カスタム分散マップ（embed_tokensを分散、lm_headをGPU 7固定）
            self.device_map = {
                'model.embed_tokens': 1,  # GPU 0から移動
                'model.layers.0': 1, 'model.layers.1': 1, 'model.layers.2': 1, 'model.layers.3': 1,
                'model.layers.4': 2, 'model.layers.5': 2, 'model.layers.6': 2, 'model.layers.7': 2,
                'model.layers.8': 3, 'model.layers.9': 3, 'model.layers.10': 3, 'model.layers.11': 3,
                'model.layers.12': 4, 'model.layers.13': 4, 'model.layers.14': 4, 'model.layers.15': 4,
                'model.layers.16': 5, 'model.layers.17': 5, 'model.layers.18': 5, 'model.layers.19': 5,
                'model.layers.20': 6, 'model.layers.21': 6, 'model.layers.22': 6, 'model.layers.23': 6,
                'model.norm': 7,
                'lm_head': 7
            }
        elif num_gpus >= 4:
            # 4GPU環境: GPU 0負荷軽減
            self.max_memory = {
                0: "50GB",  # GPU 0: 大幅軽減
                1: "75GB", 2: "75GB", 3: "75GB"
            }
            self.device_map = "balanced_low_0"
        else:
            self.device_map = "auto"  # フォールバック
            self.max_memory = None
        self.torch_dtype = config_linux.TORCH_DTYPE
        self.attn_implementation = config_linux.ATTN_IMPLEMENTATION
        
        # Q-Former設定（Web調査結果: BLIP-2公式準拠）
        self.qformer_config = {
            'num_queries': 32,                    # BLIP-2準拠
            'hidden_size': 768,                   # 🔄 Web調査修正: BLIP-2公式準拠
            'num_layers': 12,                     # 🔄 Web調査修正: BLIP-2公式準拠
            'num_heads': 12,                      # 🔄 Web調査修正: BLIP-2公式準拠
            'intermediate_size': 3072,            # 🔄 Web調査修正: BLIP-2公式準拠
            'dropout': 0.1,
            'sam_prompt_dim': config_linux.SAM_PROMPT_EMBED_DIM,  # 256
            'encoder_hidden_size': 1408,          # 🔄 Web調査追加: Vision encoder固定
        }
        
        # SAM2設定 (Meta公式API)
        self.sam2_model_id = "facebook/sam2-hiera-large"  # HuggingFace Hub自動取得
        
        # セグメンテーション特別トークン
        self.seg_token = config_linux.SEG_TOKEN  # "[SEG]"
        
        # 🆕 デュアルエンコーダー設定（2025年7月追加）
        self.use_dual_encoder = False  # デフォルトはシングルエンコーダー（互換性維持）
        self.llama_native_multimodal = True  # Llama-4のネイティブマルチモーダル活用
        self.early_fusion = True  # Early Fusion戦略
        self.qformer_cross_modal = True  # Q-Formerでのクロスモーダル融合
        self.sam_feature_extraction = True  # SAM2での特徴抽出有効化
        
        # 🔥 MoEアダプター互換性のためのllama_config辞書
        self.llama_config = {
            'hidden_size': self.llama_hidden_size,  # 5120
            'model_id': self.llama_model_id,
            'device_map': self.device_map,
            'torch_dtype': self.torch_dtype,
            'attn_implementation': self.attn_implementation
        }
        
        # 🆕 Phase 3A: MoE最適化設定 (SAM2+MLE論文準拠)
        mle_base_config = config_linux.get_mle_config()
        self.moe_config = {
            'enable_moe': True,                                          # MoE機能有効化
            'num_experts': mle_base_config['num_experts'],               # 3 (論文準拠)
            'active_experts': mle_base_config['moe_top_k'],              # 2 (Top-k論文準拠)
            'expert_capacity_factor': mle_base_config['expert_capacity_factor'], # 1.25
            'lora_rank': mle_base_config['lora_rank'],                   # 16 (論文準拠)
            'lora_alpha': mle_base_config['lora_alpha'],                 # 32 (論文準拠)
            'expert_weights': mle_base_config['expert_weights']          # 論文準拠重み配分
        }
        
        # 🆕 Phase 3C: Sa2VA風[SEG]トークン設定
        seg_token_config = config_linux.get_seg_token_config()
        self.use_seg_token = seg_token_config['use_seg_token']
        self.use_multi_frame_seg = seg_token_config['use_multi_frame']
        self.seg_token_return_attention = seg_token_config['return_attention']
        
        # 🆕 Phase 2: 部分統一トークン空間設定
        self.use_partial_unified_space = seg_token_config.get('use_partial_unified_space', False)
        self.use_adaptive_compression = seg_token_config.get('use_adaptive_compression', False)
        self.use_moe_integration = seg_token_config.get('use_moe_integration', False)



class QFormerSegmentationBridge(nn.Module):
    """
    方法3: Q-Former統合（本命・高性能）+ 重複ロード回避
    
    SEGトークン不要、クエリベースで情報抽出:
    - 32個のクエリで能動的に情報取得
    - 複数オブジェクトも処理可能
    - 情報ボトルネック解消、SOTA性能
    - Option 1: 外部共有Llama-4インスタンス使用（重複ロード回避）
    """
    
    def __init__(self, 
                 config: Optional[LlamaQFormerSAM2Config] = None, 
                 shared_llama_model: Optional[Any] = None,
                 shared_llama_processor: Optional[Any] = None,
                 training_stage: int = 1, 
                 enable_moe: bool = True):
        super().__init__()
        
        self.config = config or LlamaQFormerSAM2Config()
        self.training_stage = training_stage
        self.enable_moe = enable_moe
        
        print("=== 方法3: Q-Former純粋セグメンテーションブリッジ初期化（重複回避版） ===")
        if enable_moe:
            print("🔄 Phase 3A: MoE最適化モード有効")
        
        # 1. Llama-4-Scout VLM設定（Option 1: 共有インスタンス使用）
        self._setup_shared_llama4(shared_llama_model, shared_llama_processor)
        
        # 2. Q-Former初期化（メイン処理）
        self._init_qformer()
        
        # 3. SAM2初期化（セグメンテーション）
        self._init_sam2()
        
        # 🆕 4. Phase 3A: MoE統合初期化
        if enable_moe:
            self._init_moe_adapters()
        else:
            self.moe_adapter = None
        
        # 🆕 5. Phase 3C: Sa2VA風[SEG]トークン生成器初期化
        if self.config.use_seg_token:
            self._init_seg_token_generator()
        else:
            self.seg_token_generator = None
        
        # 🆕 6. Phase 2: 部分統一トークン空間初期化
        if self.config.use_partial_unified_space:
            self._init_phase2_components()
        else:
            self.adaptive_compressor = None
            self.cross_modal_unifier = None
            self.moe_integration_adapter = None
        
        # 7. 損失関数初期化（2025年ベストプラクティス）
        self._init_loss_function()
        
        # 8. 最終デバイス配置確認・統一
        self._ensure_device_consistency()
        
        print("✅ 方法3 Q-Formerブリッジ初期化完了（重複回避版）")
        print("  - Llama-4: 外部共有インスタンス使用")
        print("  - SEGトークン: 不使用")
        print("  - 特徴抽出: Q-Formerのみ")
        print("  - 情報ボトルネック: 解消済み")
        print(f"  - 損失関数: Stage {self.training_stage} 複合損失")
        if enable_moe:
            print(f"  - MoE最適化: 有効 ({self.config.moe_config['num_experts']} experts)")
        
    def _setup_shared_llama4(self, shared_llama_model: Optional[Any], shared_llama_processor: Optional[Any]):
        """Option 1: 共有Llama-4インスタンス設定（重複ロード回避）"""
        print(f"\n🧠 Option 1: 共有Llama-4インスタンス設定...")
        
        if shared_llama_model is not None and shared_llama_processor is not None:
            # 共有インスタンス使用（推奨）
            self.llama_model = shared_llama_model
            self.llama_processor = shared_llama_processor
            print(f"✅ 外部共有Llama-4インスタンス使用")
            print(f"  - メモリ効率: 重複ロード回避")
            print(f"  - パラメータ: 109B（共有）")
            
            # デバイス情報確認
            if hasattr(self.llama_model, 'hf_device_map'):
                device_map = self.llama_model.hf_device_map
                print(f"  - デバイス分散: {len(device_map) if device_map else 0} デバイス")
            
        else:
            # ❌ フォールバック削除: 共有インスタンスが必須
            error_msg = "❌ 共有Llama4インスタンスが未提供またはダミーモデルです。有効なLlama4モデルインスタンスを提供してください。"
            print(error_msg)
            raise RuntimeError(error_msg)
    
    
    def _init_qformer(self):
        """Q-Former初期化（2025年ベストプラクティス）"""
        print(f"\n🔍 2025年Q-Former: Early Fusion対応初期化...")
        
        try:
            # 🔄 Web調査結果: BLIP-2公式準拠設定
            method3_config = self.config.qformer_config.copy()
            method3_config.update({
                'num_queries': 32,           # 🔄 Web調査: 32が最適バランス
                'hidden_size': 768,          # 🔄 Web調査修正: BLIP-2公式準拠
                'num_layers': 12,            # 🔄 Web調査修正: BLIP-2公式準拠
                'num_heads': 12,             # 🔄 Web調査修正: BLIP-2公式準拠
                'intermediate_size': 3072,   # 🔄 Web調査修正: BLIP-2公式準拠
                'dropout': 0.1,              # 🔄 BLIP-2公式: 0.1が安定
                'sam_prompt_dim': 256,       # SAM2最適化
                'cross_attention_freq': 2,   # 🔄 2025年効率化: クロスアテンション頻度
                'encoder_hidden_size': 1408, # 🔄 Web調査追加: Vision encoder固定
            })
            
            print(f"  - Web調査結果: BLIP-2公式準拠設定:")
            print(f"    * クエリ数: {method3_config['num_queries']} (BLIP-2準拠)")
            print(f"    * 隠れ層: {method3_config['hidden_size']} (公式768次元)")
            print(f"    * レイヤー数: {method3_config['num_layers']} (公式12層)")
            print(f"    * アテンション数: {method3_config['num_heads']} (公式12頭)")
            print(f"    * 中間層: {method3_config['intermediate_size']} (公式3072次元)")
            print(f"    * エンコーダー隠れ層: {method3_config['encoder_hidden_size']} (Vision固定)")
            
            # 🔄 修正案A: encoder_hidden_size動的調整（推奨）
            from transformers import Blip2QFormerConfig, Blip2QFormerModel
            
            # Llama-4実際の出力次元を取得
            llama_hidden_size = self.config.llama_hidden_size  # 5120
            print(f"  🔧 修正案A: encoder_hidden_size動的調整")
            print(f"    - Llama-4実際次元: {llama_hidden_size}")
            print(f"    - BLIP-2デフォルト: 1408 → {llama_hidden_size}に調整")
            
            # 公式設定作成（動的調整版）
            official_config = Blip2QFormerConfig(
                vocab_size=30522,
                hidden_size=method3_config['hidden_size'],  # 768（Q-Former内部）
                num_hidden_layers=method3_config['num_layers'],  # 12
                num_attention_heads=method3_config['num_heads'],  # 12
                intermediate_size=method3_config['intermediate_size'],  # 3072
                cross_attention_frequency=method3_config['cross_attention_freq'],  # 2
                encoder_hidden_size=llama_hidden_size,  # 🔄 修正案A: 1408 → 5120動的調整
                use_qformer_text_input=False,  # Web調査推奨
                dropout=method3_config['dropout'],
                num_query_tokens=method3_config['num_queries']
            )
            
            # 公式モデル初期化
            self.qformer = Blip2QFormerModel(official_config)
            print(f"  ✅ 修正案A実装完了: 公式BLIP-2 + 動的次元調整")
            print(f"    - Q-Former内部: 768次元（公式準拠）")
            print(f"    - Cross-attention: 5120次元対応（Llama-4準拠）")
            
            # 🔄 HuggingFace公式パターン: 学習可能query_embeds
            self.query_embeds = nn.Parameter(
                torch.zeros(1, method3_config['num_queries'], method3_config['hidden_size'])
            )
            # 正規分布で初期化 (BLIP-2準拠)
            nn.init.trunc_normal_(self.query_embeds, std=0.02)
            print(f"  ✅ 学習可能query_embeds初期化: {self.query_embeds.shape}")
            
            # 🔄 2025年プロジェクター: Early Fusion最適化（Web調査ベース）
            self.enhanced_sam_projector = nn.Sequential(
                nn.Linear(method3_config['hidden_size'], method3_config['hidden_size']),
                nn.LayerNorm(method3_config['hidden_size']),
                nn.GELU(),                   # 🔄 GELU: Transformer標準（BLIP-2準拠）
                nn.Dropout(method3_config['dropout']),
                nn.Linear(method3_config['hidden_size'], method3_config['hidden_size'] // 2),
                nn.LayerNorm(method3_config['hidden_size'] // 2),
                nn.GELU(),
                nn.Dropout(method3_config['dropout']),
                nn.Linear(method3_config['hidden_size'] // 2, method3_config['sam_prompt_dim']),
            )
            
            # 🔄 2025年追加: 段階的学習対応プロジェクター
            self.curriculum_projector = nn.Sequential(
                nn.Linear(method3_config['hidden_size'], method3_config['sam_prompt_dim']),
                nn.LayerNorm(method3_config['sam_prompt_dim']),
                nn.Tanh(),  # 🔄 範囲制限: プロンプト安定化
            )
            
            # 🔥 dtype統一のためBFloat16に変換（dtype不一致エラー対策）
            if self.config.torch_dtype == torch.bfloat16:
                print(f"  🔍 デバッグ: BFloat16変換前のdtype確認")
                # 変換前の状態を確認
                for i, layer in enumerate(self.enhanced_sam_projector):
                    if hasattr(layer, 'weight'):
                        print(f"    - enhanced_sam_projector Layer {i} weight dtype (変換前): {layer.weight.dtype}")
                
                self.enhanced_sam_projector = self.enhanced_sam_projector.to(dtype=torch.bfloat16)
                self.curriculum_projector = self.curriculum_projector.to(dtype=torch.bfloat16)
                
                print(f"  🔍 デバッグ: BFloat16変換後のdtype確認")
                # 変換後の状態を確認
                for i, layer in enumerate(self.enhanced_sam_projector):
                    if hasattr(layer, 'weight'):
                        print(f"    - enhanced_sam_projector Layer {i} weight dtype (変換後): {layer.weight.dtype}")
            
            # 注記: デバイス・データ型移動は初期化完了後に一括実行
            
            print(f"✅ 2025年Q-Former初期化成功")
            print(f"  - BLIP-2準拠パラメータ数: {sum(p.numel() for p in self.qformer.parameters()):,}")
            print(f"  - 強化プロジェクター: 3層Early Fusion設計")
            print(f"  - カリキュラムプロジェクター: 段階的学習対応")
            
        except Exception as e:
            print(f"❌ 方法3高精度版 Q-Former初期化失敗: {e}")
            raise
    
    def _init_sam2(self):
        """SAM2初期化（2025年ベストプラクティス）"""
        print(f"\n🎯 2025年SAM2: 6倍高速化・最適化初期化...")
        
        try:
            # 🔄 2025年SAM2最適化 (Web調査ベース)
            self.sam2 = get_sam2_wrapper(
                model_id=self.config.sam2_model_id,
                target_dtype=self.config.torch_dtype,
                debug_mode=True,
                # 🔄 2025年高速化設定 (Web調査結果)
                vos_optimized=True,              # torch.compile VOS最適化
                compile_model=True,              # モデル全体コンパイル
                memory_pathways=3,               # 3パス最適バランス（76.3→80.8 J&F）
                mixed_precision=True,            # メモリ効率化
            )
            
            print(f"✅ 2025年SAM2初期化成功")
            print(f"  - 6倍高速化: torch.compile有効")
            print(f"  - メモリパス: 3（性能最適バランス）")
            print(f"  - 混合精度: 有効（メモリ効率化）")
            
        except Exception as e:
            print(f"❌ 方法3 SAM2初期化失敗: {e}")
            raise
    
    def _init_loss_function(self):
        """複合損失関数初期化（2025年ベストプラクティス）"""
        print(f"\n📊 方法3: 複合損失関数初期化 (Stage {self.training_stage})...")
        
        # デバイス検出
        device = next(self.llama_model.parameters()).device
        
        # 段階的学習対応複合損失関数
        self.loss_function = get_composite_loss_qformer_sam2(
            stage=self.training_stage,
            device=device
        )
        
        print(f"✅ 方法3 複合損失関数初期化成功")
        print(f"  - 学習段階: Stage {self.training_stage}")
        print(f"  - Focal Tversky Loss: 2025年最高性能")
        print(f"  - Lovász-Softmax Loss: IoU直接最適化")
        print(f"  - Q-Former Loss: マルチモーダル学習")
    
    def _init_moe_adapters(self):
        """🆕 Phase 3A: Heterogeneous MoE Adapters初期化"""
        print(f"\n🔄 Phase 3A: Heterogeneous MoE Adapters初期化中...")
        
        try:
            # ベースモデル辞書準備
            base_models = {}
            
            # Llama-4-Scout追加
            if hasattr(self, 'llama_model') and self.llama_model is not None:
                base_models['llama'] = self.llama_model
                print(f"  ✅ Llama-4-Scout: 言語理解・推論エキスパート")
            
            # SAM2除外（Web調査結果: LoRA効果限定的 + Identity()エラー回避）
            if hasattr(self, 'sam2') and self.sam2 is not None:
                print(f"  🔄 SAM2: MoE除外（Web調査準拠）")
                print(f"    - 理由1: SAM2 LoRA効果が限定的（Web調査結果）")
                print(f"    - 理由2: Identity()モジュールエラー回避")
                print(f"    - 代替: 軽量SegmentationHead活用")
            
            # Q-Former追加
            if hasattr(self, 'qformer_model') and self.qformer_model is not None:
                base_models['qformer'] = self.qformer_model
                print(f"  ✅ Q-Former: クロスモーダル融合エキスパート")
            
            if not base_models:
                print(f"  ⚠️ ベースモデルが見つかりません: MoE無効化")
                self.moe_adapter = None
                return
            
            print(f"  📊 MoE構成: {len(base_models)} エキスパート ({list(base_models.keys())})")
            
            # MoE Adapter作成
            self.moe_adapter = create_heterogeneous_moe_adapter(
                base_models=base_models,
                moe_config=self.config.moe_config
            )
            
            print(f"✅ Phase 3A: MoE Adapters初期化完了")
            
            # MoE統計表示
            moe_stats = self.moe_adapter.get_moe_statistics()
            print(f"  - 総エキスパート数: {moe_stats['total_experts']}")
            print(f"  - 学習可能パラメータ: {moe_stats['total_trainable_params']:,}")
            
        except Exception as e:
            print(f"  ❌ MoE Adapters初期化失敗: {e}")
            print(f"  🔄 標準モード継続 (MoE無効)")
            self.moe_adapter = None
    
    def _ensure_device_consistency(self):
        """全コンポーネントのデバイス配置統一（根本的修正）"""
        print(f"\n🔧 モジュール全体デバイス配置統一中...")
        
        # 基準デバイス・データ型: Llama-4の設定
        base_device = next(self.llama_model.parameters()).device
        base_dtype = next(self.llama_model.parameters()).dtype
        
        print(f"  - 基準デバイス: {base_device}")
        print(f"  - 基準データ型: {base_dtype}")
        
        # 🔄 根本的修正: モジュール全体を一括移動（PyTorch推奨パターン）
        print(f"  🔄 Q-Former + プロジェクター一括移動...")
        
        # Q-Formerモジュール全体移動
        self.qformer = self.qformer.to(device=base_device, dtype=base_dtype)
        
        # プロジェクターモジュール全体移動  
        self.enhanced_sam_projector = self.enhanced_sam_projector.to(device=base_device, dtype=base_dtype)
        self.curriculum_projector = self.curriculum_projector.to(device=base_device, dtype=base_dtype)
        
        # 🔄 学習可能Parameterの正しい移動（PyTorch公式パターン）
        if hasattr(self, 'query_embeds'):
            # Parameter.dataを直接更新（Parameter型維持）
            self.query_embeds.data = self.query_embeds.data.to(device=base_device, dtype=base_dtype)
            print(f"  ✅ query_embeds Parameter移動: {base_device}, {base_dtype}")
        
        # 損失関数デバイス移動
        if hasattr(self.loss_function, 'to'):
            self.loss_function = self.loss_function.to(base_device)
        
        print(f"  ✅ Q-Former: {base_device}, {base_dtype}")
        print(f"  ✅ 強化プロジェクター: {base_device}, {base_dtype}")
        print(f"  ✅ カリキュラムプロジェクター: {base_device}, {base_dtype}")
        print(f"  ✅ 学習可能query_embeds: Parameter型維持")
        
        print(f"✅ 全コンポーネント デバイス配置統一完了")
    
    def _init_seg_token_generator(self):
        """🆕 Phase 3C: Sa2VA風[SEG]トークン生成器初期化"""
        print(f"\n🔄 Phase 3C: Sa2VA風[SEG]トークン生成器初期化中...")
        
        try:
            from model.seg_token_generator import create_seg_token_generator
            
            # [SEG]トークン生成器作成
            self.seg_token_generator = create_seg_token_generator(
                config=self.config,
                multi_frame=self.config.use_multi_frame_seg
            )
            
            # 🔥 デバイス・dtype統一（提案A実装）
            base_device = next(self.llama_model.parameters()).device
            base_dtype = next(self.llama_model.parameters()).dtype
            self.seg_token_generator = self.seg_token_generator.to(device=base_device, dtype=base_dtype)
            
            print(f"✅ Phase 3C: [SEG]トークン生成器初期化完了")
            print(f"  - モード: {'動画対応' if self.config.use_multi_frame_seg else '静止画'}")
            print(f"  - Q-Former次元: {self.config.qformer_config['hidden_size']}")
            print(f"  - Llama次元: {self.config.llama_hidden_size}")
            print(f"  - SAMプロンプト次元: {self.config.qformer_config['sam_prompt_dim']}")
            print(f"  - 注意重み返却: {self.config.seg_token_return_attention}")
            print(f"  - デバイス: {base_device}")
            print(f"  - データ型: {base_dtype}")
            
        except Exception as e:
            print(f"  ❌ [SEG]トークン生成器初期化失敗: {e}")
            print(f"  🔄 標準モード継続 ([SEG]トークン無効)")
            self.seg_token_generator = None
    
    def _init_phase2_components(self):
        """🆕 Phase 2: 部分統一トークン空間コンポーネント初期化"""
        print(f"\n🔄 Phase 2: 部分統一トークン空間コンポーネント初期化中...")
        
        try:
            # 基準デバイス・データ型
            base_device = next(self.llama_model.parameters()).device
            base_dtype = next(self.llama_model.parameters()).dtype
            
            # 1. 適応的トークン圧縮器
            if self.config.use_adaptive_compression:
                from model.adaptive_token_compressor import create_adaptive_compressor
                self.adaptive_compressor = create_adaptive_compressor(self.config)
                self.adaptive_compressor = self.adaptive_compressor.to(device=base_device, dtype=base_dtype)
                print(f"  ✅ AdaptiveTokenCompressor初期化完了")
                print(f"    - 最大圧縮トークン数: 8")
                print(f"    - 最小圧縮トークン数: 1")
            else:
                self.adaptive_compressor = None
            
            # 2. クロスモーダル統一層
            from model.cross_modal_unifier import create_cross_modal_unifier
            self.cross_modal_unifier = create_cross_modal_unifier(self.config)
            self.cross_modal_unifier = self.cross_modal_unifier.to(device=base_device, dtype=base_dtype)
            print(f"  ✅ CrossModalUnifier初期化完了")
            print(f"    - 融合層数: 2")
            print(f"    - モダリティ: vision, text, seg")
            
            # 3. MoE統合アダプター
            if self.config.use_moe_integration:
                from model.moe_integration_adapter import create_moe_integration_adapter
                self.moe_integration_adapter = create_moe_integration_adapter(self.config)
                self.moe_integration_adapter = self.moe_integration_adapter.to(device=base_device, dtype=base_dtype)
                print(f"  ✅ MoEIntegrationAdapter初期化完了")
                print(f"    - エキスパート数: 16 (Llama-4-Scout)")
                print(f"    - アクティブエキスパート: 2")
            else:
                self.moe_integration_adapter = None
            
            print(f"✅ Phase 2: 部分統一トークン空間コンポーネント初期化完了")
            print(f"  - デバイス: {base_device}")
            print(f"  - データ型: {base_dtype}")
            
        except Exception as e:
            print(f"  ❌ Phase 2コンポーネント初期化失敗: {e}")
            print(f"  🔄 標準モード継続 (Phase 2無効)")
            self.adaptive_compressor = None
            self.cross_modal_unifier = None
            self.moe_integration_adapter = None
    
    def set_training_stage(self, stage: int):
        """学習段階設定"""
        self.training_stage = stage
        if hasattr(self, 'loss_function') and hasattr(self.loss_function, 'set_stage'):
            self.loss_function.set_stage(stage)
        print(f"🔄 学習段階を Stage {stage} に変更")
    
    def compute_loss(
        self,
        predicted_masks: torch.Tensor,
        target_masks: torch.Tensor,
        query_embeds: Optional[torch.Tensor] = None,
        text_embeds: Optional[torch.Tensor] = None,
        sam_prompts: Optional[torch.Tensor] = None,
        **kwargs
    ) -> Dict[str, torch.Tensor]:
        """
        統合損失計算（方法3専用 + 2025年ベストプラクティス）
        
        Args:
            predicted_masks: 予測マスク (B, num_queries, H, W) 
            target_masks: 正解マスク (B, H, W)
            query_embeds: Q-Formerクエリ埋め込み (B, num_queries, hidden_size)
            text_embeds: テキスト埋め込み (B, hidden_size)
            sam_prompts: SAMプロンプト (B, num_queries, prompt_dim)
            
        Returns:
            Dict: 損失辞書
        """
        
        # 2025年ベストプラクティス: 損失計算前のデバイス・データ型確認
        base_device = next(self.llama_model.parameters()).device
        base_dtype = next(self.llama_model.parameters()).dtype
        
        # 強制的デバイス・データ型統一（最終安全策）
        predicted_masks = predicted_masks.to(device=base_device, dtype=base_dtype)
        target_masks = target_masks.to(device=base_device, dtype=base_dtype)
        if query_embeds is not None:
            query_embeds = query_embeds.to(device=base_device, dtype=base_dtype)
        if text_embeds is not None:
            text_embeds = text_embeds.to(device=base_device, dtype=base_dtype)
        if sam_prompts is not None:
            sam_prompts = sam_prompts.to(device=base_device, dtype=base_dtype)
        
        if hasattr(self.loss_function, 'forward'):
            # 複合損失関数使用
            return self.loss_function(
                predicted_masks=predicted_masks,
                target_masks=target_masks,
                query_embeds=query_embeds,
                text_embeds=text_embeds,
                sam_prompts=sam_prompts,
                **kwargs
            )
        else:
            # フォールバック損失
            if predicted_masks.dim() == 4:
                # 複数クエリの場合、最良マスクを選択
                batch_size, num_queries = predicted_masks.shape[:2]
                target_expanded = target_masks.unsqueeze(1).expand(-1, num_queries, -1, -1)
                
                # 各クエリのDice係数計算
                dice_scores = []
                for i in range(num_queries):
                    pred_i = torch.sigmoid(predicted_masks[:, i])
                    intersection = (pred_i * target_masks).sum(dim=(1, 2))
                    union = pred_i.sum(dim=(1, 2)) + target_masks.sum(dim=(1, 2))
                    dice = 1 - (2.0 * intersection + 1e-6) / (union + 1e-6)
                    dice_scores.append(dice.mean())
                
                # 最良クエリを選択
                best_idx = torch.stack(dice_scores).argmin()
                best_masks = predicted_masks[:, best_idx]
            else:
                best_masks = predicted_masks
            
            basic_loss = self.loss_function(best_masks, target_masks.float())
            return {'total_loss': basic_loss, 'basic_loss': basic_loss}
    
    def forward(
        self,
        images: torch.Tensor,
        input_ids: torch.Tensor,
        attention_mask: Optional[torch.Tensor] = None,
        labels: Optional[torch.Tensor] = None,
        sam_images: Optional[torch.Tensor] = None,  # 🆕 デュアルエンコーダー対応
        return_dict: bool = True
    ) -> Dict[str, Any]:
        """
        方法3: 純粋Q-Formerベースセグメンテーション
        
        SEGトークン不要の完全自動特徴抽出:
        1. Llama-4-Scout: テキスト+画像理解
        2. Q-Former: 64クエリで多角的特徴抽出
        3. SAM2: リッチプロンプトでセグメンテーション
        
        デュアルエンコーダー対応（2025年7月）:
        - images: Llama-4用画像 (448x448)
        - sam_images: SAM2用画像 (1024x1024)
        """
        
        batch_size = images.size(0)
        device = images.device
        
        # デュアルエンコーダーモードの判定
        is_dual_encoder = (
            self.config.use_dual_encoder and 
            sam_images is not None and 
            sam_images.size(0) == batch_size
        )
        
        if is_dual_encoder:
            print(f"🔄 方法3フォワードパス開始（デュアルエンコーダーモード）...")
        else:
            print(f"🔄 方法3フォワードパス開始（シングルエンコーダーモード）...")
        
        # 1. Llama-4-Scout: マルチモーダル理解
        print(f"  🧠 Llama-4-Scout推論...")
        
        # 基本入力確認
        print(f"  🔍 入力: IDs={input_ids.shape}, 画像={images.shape}, NaN確認={torch.isnan(images).any().item()}")
        
        # トークン範囲チェック
        if hasattr(self.llama_model.config, 'vocab_size'):
            vocab_size = self.llama_model.config.vocab_size
            if (input_ids >= vocab_size).any():
                input_ids = torch.clamp(input_ids, max=vocab_size-1)
        
        # Model Parallelismの場合の入力準備
        if hasattr(self.llama_model, 'hf_device_map') and self.llama_model.hf_device_map:
            print(f"    🔧 Model Parallelism検出: HuggingFaceが自動的にデバイス配置を管理")
            
            # 🚨 緊急デバッグ: Model Parallelismデバイス分析
            print(f"    📊 Model Parallelism詳細分析:")
            device_map = self.llama_model.hf_device_map
            print(f"      - デバイスマップエントリ数: {len(device_map)}")
            
            # デバイス別レイヤー数カウント
            device_counts = {}
            for layer_name, layer_device in device_map.items():
                device_str = str(layer_device)
                device_counts[device_str] = device_counts.get(device_str, 0) + 1
                
            print(f"      - デバイス分散: {device_counts}")
            
            # embed_tokensとlm_headの配置確認
            embed_device = device_map.get('model.embed_tokens', 'not_found')
            lm_head_device = device_map.get('lm_head', 'not_found')
            print(f"      - embed_tokens: {embed_device}")
            print(f"      - lm_head: {lm_head_device}")
            
            # 🚨 入力データのデバイス統一性チェック
            input_devices = {
                'input_ids': input_ids.device,
                'images': images.device,
                'attention_mask': attention_mask.device if attention_mask is not None else None
            }
            print(f"      - 入力データデバイス: {input_devices}")
            
            # embed_tokensの実際のデバイス
            actual_embed_device = next(self.llama_model.get_input_embeddings().parameters()).device
            print(f"      - embed_tokens実際デバイス: {actual_embed_device}")
            
        else:
            # Model Parallelismが無効な場合は現在のデバイスを維持
            print(f"    🔧 単一デバイスモード: {device}")
        
        # Llama-4実行
        try:
            print(f"    🔍 Llama-4実行開始...")
            
            # 🚨 緊急デバッグ: 入力データ詳細検証
            print(f"    📊 緊急デバッグ - 入力データ検証:")
            print(f"      - input_ids: shape={input_ids.shape}, dtype={input_ids.dtype}, device={input_ids.device}")
            print(f"      - input_ids範囲: [{input_ids.min().item()}, {input_ids.max().item()}]")
            print(f"      - input_ids NaN: {torch.isnan(input_ids.float()).any().item()}")
            print(f"      - images: shape={images.shape}, dtype={images.dtype}, device={images.device}")
            print(f"      - images範囲: [{images.min().item():.6f}, {images.max().item():.6f}]")
            print(f"      - images NaN: {torch.isnan(images).any().item()}")
            if attention_mask is not None:
                print(f"      - attention_mask: shape={attention_mask.shape}, dtype={attention_mask.dtype}")
                print(f"      - attention_mask範囲: [{attention_mask.min().item()}, {attention_mask.max().item()}]")
            
            # 🚨 緊急デバッグ: embed_tokens層検証
            print(f"    🔍 embed_tokens層検証:")
            embed_tokens = self.llama_model.get_input_embeddings()
            print(f"      - embed_tokens weight: shape={embed_tokens.weight.shape}, dtype={embed_tokens.weight.dtype}")
            print(f"      - embed_tokens device: {embed_tokens.weight.device}")
            embed_nan = torch.isnan(embed_tokens.weight).any().item()
            embed_inf = torch.isinf(embed_tokens.weight).any().item()
            print(f"      - embed_tokens NaN: {embed_nan}, Inf: {embed_inf}")
            
            if embed_nan or embed_inf:
                print(f"      ❌ 致命的: embed_tokens重みが破損!")
                # NaN/Inf位置の詳細分析
                if embed_nan:
                    nan_positions = torch.isnan(embed_tokens.weight).nonzero()
                    print(f"      - NaN位置数: {nan_positions.shape[0]}")
                    print(f"      - 最初の5 NaN位置: {nan_positions[:5].tolist() if nan_positions.shape[0] > 0 else 'なし'}")
                
                if embed_inf:
                    inf_positions = torch.isinf(embed_tokens.weight).nonzero()
                    print(f"      - Inf位置数: {inf_positions.shape[0]}")
                    print(f"      - 最初の5 Inf位置: {inf_positions[:5].tolist() if inf_positions.shape[0] > 0 else 'なし'}")
                
                # 🚨 緊急修復試行（ゼロ初期化）
                print(f"      🔧 緊急修復: NaN/Inf → 正規分布初期化")
                with torch.no_grad():
                    if embed_nan:
                        nan_mask = torch.isnan(embed_tokens.weight)
                        embed_tokens.weight[nan_mask] = torch.randn_like(embed_tokens.weight[nan_mask]) * 0.02
                    if embed_inf:
                        inf_mask = torch.isinf(embed_tokens.weight)
                        embed_tokens.weight[inf_mask] = torch.randn_like(embed_tokens.weight[inf_mask]) * 0.02
                print(f"      ✅ 緊急修復完了")
                
            else:
                embed_min = embed_tokens.weight.min().item()
                embed_max = embed_tokens.weight.max().item()
                print(f"      - embed_tokens範囲: [{embed_min:.6f}, {embed_max:.6f}]")
            
            # 🚨 vocab_size検証
            vocab_size = self.llama_model.config.vocab_size
            print(f"      - vocab_size: {vocab_size}")
            invalid_tokens = (input_ids >= vocab_size).sum().item()
            print(f"      - 無効トークン数: {invalid_tokens}")
            
            # 🚨 テスト用embed実行
            print(f"    🧪 embed_tokens テスト実行:")
            with torch.no_grad():
                try:
                    # 小さなサンプルでembed test
                    test_ids = input_ids[:, :10].clone()  # 最初の10トークンのみ
                    test_embeds = embed_tokens(test_ids)
                    test_nan = torch.isnan(test_embeds).any().item()
                    test_inf = torch.isinf(test_embeds).any().item()
                    print(f"      - テスト埋め込み: shape={test_embeds.shape}, NaN={test_nan}, Inf={test_inf}")
                    if not test_nan and not test_inf:
                        print(f"      - テスト埋め込み範囲: [{test_embeds.min().item():.6f}, {test_embeds.max().item():.6f}]")
                except Exception as embed_error:
                    print(f"      ❌ embed_tokensテスト失敗: {embed_error}")
            
            llama_outputs = self.llama_model(
                input_ids=input_ids,
                attention_mask=attention_mask,
                images=images,  # Llama-4用画像
                labels=labels,
                output_hidden_states=True,
                output_attentions=True,  # 🆕 attention監視用
                return_dict=True
            )
                        
        except Exception as e:
            print(f"    ⚠️ Llama-4エラー: {e}")
            raise
        
        # Llama出力チェック（詳細デバッグ + 2025年安定性監視）
        print(f"  🔍 Llama-4出力詳細解析:")
        if llama_outputs.loss is not None:
            loss_nan = torch.isnan(llama_outputs.loss).item()
            loss_inf = torch.isinf(llama_outputs.loss).item()
            print(f"    - loss: {llama_outputs.loss.item():.6f}, NaN={loss_nan}, Inf={loss_inf}")
        else:
            print(f"    - loss: None")
            
        # 🚨 2025年修正B: Attention Entropy Collapse監視
        if hasattr(llama_outputs, 'attentions') and llama_outputs.attentions is not None:
            try:
                # 最後の層のattentionのエントロピー計算
                last_attention = llama_outputs.attentions[-1]  # [batch, heads, seq, seq]
                if not torch.isnan(last_attention).any():
                    # attention weightのエントロピー計算
                    attention_probs = last_attention.mean(dim=1)  # head平均
                    attention_entropy = -(attention_probs * torch.log(attention_probs + 1e-8)).sum(dim=-1).mean()
                    print(f"    - attention entropy: {attention_entropy.item():.6f} (低値=collapse警告)")
                    
                    # エントロピーが低すぎる場合の警告
                    if attention_entropy < 1.0:  # 閾値は実験的に決定
                        print(f"      ⚠️ Attention Entropy Collapse検出! 訓練不安定性の可能性")
                else:
                    print(f"    - attention: NaN検出、エントロピー計算スキップ")
            except Exception as entropy_error:
                print(f"    - attention entropy計算エラー: {entropy_error}")
            
        if hasattr(llama_outputs, 'logits'):
            logits = llama_outputs.logits
            # 提案C: CPU-based完全メモリ最適化（GPU VRAM圧迫排除）
            sample_size = 500  # さらに小サンプル化（500要素）
            logits_flat = logits.view(-1)
            sample_indices = torch.randint(0, logits_flat.shape[0], (sample_size,), device='cpu')  # CPUでインデックス生成
            
            # 🎯 最小データのみをCPUに転送（VRAM影響最小化）
            logits_sample_gpu = logits_flat[sample_indices.to(logits.device)]
            logits_sample_cpu = logits_sample_gpu.detach().cpu()  # 最小限データのみCPU転送
            
            # CPUで完全チェック（GPU VRAMへの影響ゼロ）
            logits_nan = torch.isnan(logits_sample_cpu).any().item()
            logits_inf = torch.isinf(logits_sample_cpu).any().item()
            print(f"    - logits: shape={logits.shape}, dtype={logits.dtype}, NaN={logits_nan}, Inf={logits_inf} (CPUサンプル{sample_size}要素)")
            
            if logits_nan:
                # NaN位置の詳細分析（メモリ効率版）
                print(f"      ❌ logits NaN検出! (サンプル{sample_size}要素中)")
                print(f"      - 詳細: サンプリングでNaN発見、全logits確認が必要")
                
                # トークン別NaN分析（メモリ効率版スキップ）
                print(f"      - 詳細分析: メモリ効率化のためスキップ")
            else:
                logits_min = logits.min().item()
                logits_max = logits.max().item()
                print(f"    - logits範囲: [{logits_min:.6f}, {logits_max:.6f}]")
                
        if hasattr(llama_outputs, 'hidden_states'):
            last_hidden = llama_outputs.hidden_states[-1]
            hidden_nan = torch.isnan(last_hidden).any().item()
            hidden_inf = torch.isinf(last_hidden).any().item()
            print(f"    - hidden_states: shape={last_hidden.shape}, dtype={last_hidden.dtype}")
            print(f"    - hidden_states NaN={hidden_nan}, Inf={hidden_inf}")
            
            if hidden_nan:
                nan_positions = torch.isnan(last_hidden).nonzero()
                print(f"      ❌ hidden_states NaN検出! 位置数: {nan_positions.shape[0]}")
                print(f"      - 最初の5位置: {nan_positions[:5].tolist() if nan_positions.shape[0] > 0 else 'なし'}")
            else:
                hidden_min = last_hidden.min().item()
                hidden_max = last_hidden.max().item()
                print(f"    - hidden_states範囲: [{hidden_min:.6f}, {hidden_max:.6f}]")
        
        # 2. Q-Former: 64クエリで能動的情報抽出
        print(f"  🔍 Q-Former 64クエリ抽出...")
        encoder_hidden_states = llama_outputs.hidden_states[-1]
        
        # デバイス・データ型統一
        llama_device = encoder_hidden_states.device
        llama_dtype = encoder_hidden_states.dtype
        qformer_device = next(self.qformer.parameters()).device
        qformer_dtype = next(self.qformer.parameters()).dtype
        
        if llama_device != qformer_device or llama_dtype != qformer_dtype:
            self.qformer = self.qformer.to(device=llama_device, dtype=llama_dtype)
            self.enhanced_sam_projector = self.enhanced_sam_projector.to(device=llama_device, dtype=llama_dtype)
        
        # Query embedsの展開
        batch_size = encoder_hidden_states.shape[0]
        query_embeds = self.query_embeds.expand(batch_size, -1, -1)
        
        # 🔄 公式Blip2QFormerModel実行
        
        qformer_outputs = self.qformer(
            query_embeds=query_embeds,
            encoder_hidden_states=encoder_hidden_states,
            encoder_attention_mask=attention_mask,
            # Web調査結果: 公式APIは標準パラメータのみ
            use_cache=False,
            output_attentions=False,
            return_dict=True
        )
        
        # 出力抽出
        qformer_hidden_states = qformer_outputs.last_hidden_state
        print(f"  ✅ Q-Former処理完了: {qformer_hidden_states.shape}")
        
        # 🆕 Phase 3C: Sa2VA風[SEG]トークン生成
        seg_token_outputs = None
        if self.config.use_seg_token and self.seg_token_generator is not None:
            print(f"  🔄 Phase 3C: [SEG]トークン生成中...")
            try:
                # Q-Former出力を使って[SEG]トークン生成
                seg_token_outputs = self.seg_token_generator(
                    qformer_outputs={'query_embeds': qformer_hidden_states},
                    llama_hidden_states=encoder_hidden_states,
                    return_attention=self.config.seg_token_return_attention
                )
                
                print(f"  ✅ [SEG]トークン生成完了")
                print(f"    - SEGトークン: {seg_token_outputs['seg_token'].shape}")
                print(f"    - SAMプロンプト: {seg_token_outputs['sam_prompt'].shape}")
                
                if 'attention_weights' in seg_token_outputs:
                    # 最も注目されているQ-Formerクエリ
                    top_queries = seg_token_outputs['attention_weights'].argmax(dim=-1)
                    print(f"    - 注目クエリ: {top_queries.tolist()}")
                    
            except Exception as e:
                print(f"  ⚠️ [SEG]トークン生成エラー: {e}")
                print(f"  🔄 標準処理継続")
                seg_token_outputs = None
        
        # 🆕 Phase 2: 部分統一トークン空間処理
        phase2_outputs = None
        if self.config.use_partial_unified_space:
            print(f"  🔄 Phase 2: 部分統一トークン空間処理中...")
            try:
                # 1. 適応的トークン圧縮
                compressed_outputs = None
                if self.adaptive_compressor is not None:
                    compressed_outputs = self.adaptive_compressor(
                        qformer_outputs={'query_embeds': qformer_hidden_states},
                        return_details=True
                    )
                    print(f"    ✅ トークン圧縮完了: {qformer_hidden_states.shape[1]} → {compressed_outputs['num_tokens']}")
                    print(f"    - 圧縮率: {compressed_outputs['compression_ratio']:.1f}x")
                
                # 2. クロスモーダル統一処理
                if self.cross_modal_unifier is not None:
                    # 圧縮されたビジョントークン（なければQ-Former出力を使用）
                    vision_tokens = compressed_outputs['compressed_tokens'] if compressed_outputs else qformer_hidden_states
                    
                    # [SEG]トークン（利用可能な場合）
                    seg_tokens = seg_token_outputs['seg_token'].unsqueeze(1) if seg_token_outputs else None
                    
                    # テキストトークン（Llama隠れ状態の一部）
                    text_tokens = encoder_hidden_states[:, :10, :]  # 最初の10トークン
                    
                    # デバッグ情報出力
                    print(f"    🔍 デバッグ: トークンサイズ")
                    print(f"    - vision_tokens: {vision_tokens.shape}")
                    print(f"    - text_tokens: {text_tokens.shape}")
                    if seg_tokens is not None:
                        print(f"    - seg_tokens: {seg_tokens.shape}")
                    print(f"    - attention_mask: {attention_mask.shape if attention_mask is not None else None}")
                    print(f"    - encoder_hidden_states: {encoder_hidden_states.shape}")
                    
                    # attention_maskの調整：統一トークン数に合わせる
                    if attention_mask is not None:
                        # 各モダリティのトークン数を計算
                        vision_len = vision_tokens.shape[1]
                        text_len = text_tokens.shape[1]
                        seg_len = seg_tokens.shape[1] if seg_tokens is not None else 0
                        total_len = vision_len + text_len + seg_len
                        
                        print(f"    - 統一トークン総数: {total_len} (vision:{vision_len} + text:{text_len} + seg:{seg_len})")
                        
                        # テキスト部分のマスクを抽出（最初の10トークン）
                        text_mask_part = attention_mask[:, :text_len] if attention_mask.shape[1] >= text_len else torch.ones(batch_size, text_len, device=device, dtype=torch.bool)
                        
                        # 新しい統一マスクを作成
                        unified_attention_mask = torch.ones(batch_size, total_len, device=device, dtype=torch.bool)
                        
                        # 各モダリティのマスクを設定
                        current_pos = 0
                        # ビジョンマスク（圧縮されているので全て有効）
                        unified_attention_mask[:, current_pos:current_pos + vision_len] = True
                        current_pos += vision_len
                        
                        # SEGマスク（存在する場合は有効）
                        if seg_len > 0:
                            unified_attention_mask[:, current_pos:current_pos + seg_len] = True
                            current_pos += seg_len
                        
                        # テキストマスク（元のマスクから抽出）
                        unified_attention_mask[:, current_pos:current_pos + text_len] = text_mask_part
                        
                        print(f"    - 統一attention_mask: {unified_attention_mask.shape}")
                        attention_mask_for_unifier = unified_attention_mask
                    else:
                        attention_mask_for_unifier = None
                    
                    unified_outputs = self.cross_modal_unifier(
                        vision_tokens=vision_tokens,
                        text_tokens=text_tokens,
                        seg_tokens=seg_tokens,
                        attention_mask=attention_mask_for_unifier,
                        return_separated=True
                    )
                    
                    print(f"    ✅ クロスモーダル統一完了")
                    print(f"    - 統一トークン数: {unified_outputs['total_seq_len']}")
                    print(f"    - モダリティ: {list(unified_outputs['modality_masks'].keys())}")
                
                # 3. MoE統合アダプター適用
                if self.moe_integration_adapter is not None and unified_outputs is not None:
                    try:
                        # デバッグ: dtype確認
                        print(f"    🔍 MoE統合前のdtype確認:")
                        print(f"    - unified_tokens dtype: {unified_outputs['unified_tokens'].dtype}")
                        print(f"    - MoE adapter dtype: {next(self.moe_integration_adapter.parameters()).dtype}")
                        
                        moe_adapted_outputs = self.moe_integration_adapter(
                            unified_tokens=unified_outputs['unified_tokens'],
                            modality_masks=unified_outputs['modality_masks'],
                            return_routing_info=True
                        )
                    except Exception as moe_error:
                        print(f"    ⚠️ MoE統合エラーの詳細: {moe_error}")
                        print(f"    - エラー発生箇所: MoEIntegrationAdapter")
                        raise
                    
                    print(f"    ✅ MoE統合アダプター適用完了")
                    print(f"    - ロードバランス損失: {moe_adapted_outputs['load_balance_loss'].item():.4f}")
                    
                    # Phase 2処理は成功したが、qformer_hidden_statesは変更しない
                    # Phase 2の結果は別途phase2_outputsに保存されている
                    print(f"    📝 注: Phase 2処理完了、Q-Former出力は元の形状を維持")
                    
                    phase2_outputs = {
                        'compressed_outputs': compressed_outputs,
                        'unified_outputs': unified_outputs,
                        'moe_adapted_outputs': moe_adapted_outputs
                    }
                    
                    # Phase 2処理成功時のqformer_hidden_statesを保存
                    print(f"    ✅ Phase 2処理成功: Q-Former次元調整完了")
                    
            except Exception as e:
                print(f"  ⚠️ Phase 2処理エラー: {e}")
                print(f"  🔄 標準処理継続")
                phase2_outputs = None
                # エラー時はqformer_hidden_statesを元に戻す必要はない（変更していないため）
        
        # 🆕 Phase 3A: MoE統合処理
        moe_info = {}
        if self.enable_moe and self.moe_adapter is not None:
            print(f"  🔄 Phase 3A: MoE最適化適用中...")
            
            try:
                # 🔥 Option A: Q-Former出力(768次元)をMoE入力(5120次元)に投影
                print(f"    📊 次元変換: Q-Former({qformer_hidden_states.shape[-1]}次元) → MoE({self.config.llama_config['hidden_size']}次元)")
                print(f"    - qformer_hidden_states shape: {qformer_hidden_states.shape}")
                
                # Q-Former用投影層を追加（初回のみ作成）
                if not hasattr(self, 'qformer_to_moe_projector'):
                    print(f"    🔧 Q-Former→MoE投影層を作成中...")
                    self.qformer_to_moe_projector = nn.Linear(
                        768,  # Q-Former出力次元（BLIP-2準拠）
                        self.config.llama_config['hidden_size'],  # MoE入力次元（5120）
                        bias=True
                    ).to(device=qformer_hidden_states.device, dtype=qformer_hidden_states.dtype)
                    print(f"    ✅ 投影層作成完了: 768 → {self.config.llama_config['hidden_size']}")
                
                # dtype統一処理強化: MoE処理前にbfloat16統一
                print(f"    🔍 dtype統一処理開始:")
                print(f"      - qformer_hidden_states dtype: {qformer_hidden_states.dtype}")
                print(f"      - 投影層dtype: {self.qformer_to_moe_projector.weight.dtype}")
                
                # qformer_hidden_statesをbfloat16に統一
                if qformer_hidden_states.dtype != torch.bfloat16:
                    print(f"    🔄 qformer_hidden_states dtype変換: {qformer_hidden_states.dtype} → bfloat16")
                    qformer_hidden_states = qformer_hidden_states.to(dtype=torch.bfloat16)
                
                # 投影層もbfloat16に統一
                if self.qformer_to_moe_projector.weight.dtype != torch.bfloat16:
                    print(f"    🔄 投影層dtype変換: {self.qformer_to_moe_projector.weight.dtype} → bfloat16")
                    self.qformer_to_moe_projector = self.qformer_to_moe_projector.to(dtype=torch.bfloat16)
                
                # Q-Former出力を5120次元に投影
                projected_states = self.qformer_to_moe_projector(qformer_hidden_states)
                print(f"    ✅ 次元投影完了: {qformer_hidden_states.shape} → {projected_states.shape}")
                print(f"      - projected_states dtype: {projected_states.dtype}")
                
                # デバイス・dtype整合性チェック
                qformer_device = projected_states.device
                qformer_dtype = projected_states.dtype
                
                # test_phase3b成功パターン: MoEアダプター詳細デバイス分析とデバッグ
                print(f"    🔍 MoEアダプター詳細デバイス分析開始...")
                
                # 全パラメータのデバイス状況を詳細確認
                moe_meta_params = []
                moe_cpu_params = []
                moe_cuda_params = []
                
                for name, param in self.moe_adapter.named_parameters():
                    if param.is_meta:
                        moe_meta_params.append(name)
                    elif param.device.type == 'cpu':
                        moe_cpu_params.append(name)
                    elif param.device.type == 'cuda':
                        moe_cuda_params.append(name)
                
                print(f"      📊 MoEアダプターパラメータ分析:")
                print(f"        - meta tensors: {len(moe_meta_params)} 個")
                print(f"        - CPU tensors: {len(moe_cpu_params)} 個")
                print(f"        - CUDA tensors: {len(moe_cuda_params)} 個")
                
                if moe_meta_params:
                    print(f"        - meta例: {moe_meta_params[:2]}{'...' if len(moe_meta_params) > 2 else ''}")
                if moe_cpu_params:
                    print(f"        - CPU例: {moe_cpu_params[:2]}{'...' if len(moe_cpu_params) > 2 else ''}")
                if moe_cuda_params:
                    print(f"        - CUDA例: {moe_cuda_params[:2]}{'...' if len(moe_cuda_params) > 2 else ''}")
                
                # CPU tensorがある場合は個別移動を試行
                if moe_cpu_params:
                    print(f"    🔄 CPU tensors検出: {len(moe_cpu_params)}個をCUDAに移動試行...")
                    success_count = 0
                    
                    for name, param in self.moe_adapter.named_parameters():
                        if not param.is_meta and param.device.type == 'cpu':
                            try:
                                # 個別パラメータをCUDAに移動
                                param.data = param.data.to(device=qformer_device, dtype=qformer_dtype, non_blocking=True)
                                success_count += 1
                            except Exception as e:
                                print(f"      ❌ {name} 移動失敗: {e}")
                    
                    print(f"    ✅ CPU→CUDA移動成功: {success_count}/{len(moe_cpu_params)} 個")
                
                # meta tensorがない場合は全体移動も試行
                elif not moe_meta_params:
                    try:
                        moe_device = next(self.moe_adapter.parameters()).device
                        moe_dtype = next(self.moe_adapter.parameters()).dtype
                        
                        if moe_device != qformer_device or moe_dtype != qformer_dtype:
                            print(f"    🔄 MoEアダプター全体移動: {moe_device}/{moe_dtype} → {qformer_device}/{qformer_dtype}")
                            self.moe_adapter = self.moe_adapter.to(device=qformer_device, dtype=qformer_dtype, non_blocking=True)
                            print(f"    ✅ MoEアダプター全体移動完了")
                    except Exception as e:
                        print(f"    ❌ MoEアダプター全体移動失敗: {e}")
                else:
                    print(f"    🔄 meta tensors含有のため、デバイス移動をスキップ（disk offload維持）")
                
                # 投影されたQ-Former出力をMoE処理（詳細デバッグ付き）
                print(f"    🔄 MoE処理開始...")
                print(f"      - 入力shape: {projected_states.shape}")
                print(f"      - 入力dtype: {projected_states.dtype}")
                print(f"      - 入力device: {projected_states.device}")
                
                # MoE処理実行（本質的エラー処理、フォールバックなし）
                moe_output, moe_stats = self.moe_adapter(
                    hidden_states=projected_states,  # 5120次元に投影済み
                    expert_type=None  # 自動ルーティング
                )
                print(f"    ✅ MoE処理成功")
                print(f"      - 出力shape: {moe_output.shape}")
                print(f"      - 出力dtype: {moe_output.dtype}")
                print(f"      - 出力device: {moe_output.device}")
                
                # MoE処理結果を元の768次元に逆投影（Q-Formerとの互換性維持）
                if not hasattr(self, 'moe_to_qformer_projector'):
                    print(f"    🔧 MoE→Q-Former逆投影層を作成中...")
                    self.moe_to_qformer_projector = nn.Linear(
                        self.config.llama_config['hidden_size'],  # MoE出力次元（5120）
                        768,  # Q-Former次元（BLIP-2準拠）
                        bias=True
                    ).to(device=moe_output.device, dtype=moe_output.dtype)
                    print(f"    ✅ 逆投影層作成完了: {self.config.llama_config['hidden_size']} → 768")
                
                # MoE出力を768次元に逆投影
                qformer_hidden_states = self.moe_to_qformer_projector(moe_output)
                
                # 🔥 重要: MoE逆投影後もBFloat16を維持（dtype不一致エラー対策）
                if qformer_hidden_states.dtype != torch.bfloat16:
                    print(f"    🔄 MoE逆投影出力がFloat32、BFloat16に変換中...")
                    qformer_hidden_states = qformer_hidden_states.to(dtype=torch.bfloat16)
                
                # 🔍 MoE統計の詳細デバッグ
                print(f"    🔍 MoE統計詳細デバッグ:")
                print(f"      - moe_stats type: {type(moe_stats)}")
                print(f"      - moe_stats keys: {list(moe_stats.keys()) if isinstance(moe_stats, dict) else 'Not dict'}")
                
                # 各統計値のNaNチェック
                for key, value in moe_stats.items():
                    if isinstance(value, torch.Tensor):
                        if value.numel() == 1:  # スカラー
                            val = value.item()
                            is_nan = torch.isnan(value).item()
                            print(f"        {key}: {val:.6f} (NaN: {is_nan})")
                        else:
                            nan_count = torch.isnan(value).sum().item()
                            print(f"        {key}: shape={value.shape}, NaN数={nan_count}")
                    elif isinstance(value, (int, float)):
                        is_nan = str(value) == 'nan' or (isinstance(value, float) and math.isnan(value))
                        print(f"        {key}: {value} (NaN: {is_nan})")
                    else:
                        print(f"        {key}: {type(value)}")
                
                moe_info = moe_stats
                
                print(f"    ✅ MoE最適化完了: {qformer_hidden_states.shape}")
                if 'expert_weights' in moe_info:
                    expert_weights = moe_info['expert_weights']
                    print(f"    📊 エキスパート重み: {expert_weights}")
                    
                # ロードバランス損失のNaNチェック
                if 'load_balance_loss' in moe_info:
                    lb_loss = moe_info['load_balance_loss']
                    if isinstance(lb_loss, torch.Tensor):
                        if torch.isnan(lb_loss).any():
                            print(f"    ⚠️ ロードバランス損失にNaN検出: {lb_loss}")
                        else:
                            print(f"    ✓ ロードバランス損失正常: {lb_loss.item():.6f}")
                    else:
                        print(f"    📊 ロードバランス損失: {lb_loss} (type: {type(lb_loss)})")
                
            except RuntimeError as moe_error:
                if "Expected all tensors to be on the same device" in str(moe_error) or "shapes cannot be multiplied" in str(moe_error):
                    print(f"    ⚠️ MoEアダプター処理エラー: {str(moe_error)[:100]}...")
                    print(f"    📌 標準Q-Former処理にフォールバック")
                    moe_info = {'error': 'device_or_shape_mismatch', 'details': str(moe_error)}
                else:
                    raise
            except Exception as moe_error:
                print(f"    ⚠️ MoE処理失敗: {moe_error}")
                print(f"    🔄 標準Q-Former出力継続")
                moe_info = {'error': str(moe_error)}
        
        # 出力用辞書作成
        qformer_outputs = {
            'query_embeds': qformer_hidden_states,  # (batch, 32, 768) or MoE-optimized
            'sam_prompts': torch.zeros(batch_size, self.config.qformer_config['num_queries'], 256, device=encoder_hidden_states.device, dtype=encoder_hidden_states.dtype),
            'moe_info': moe_info,  # 🆕 MoE統計情報
            'phase2_outputs': phase2_outputs  # 🆕 Phase 2処理結果
        }
        
        # 3. 高精度リッチプロンプト生成（Web調査修正: 768次元）
        query_embeddings = qformer_outputs['query_embeds']  # (batch, 32, 768)
        
        # Phase 2処理時のデバッグ
        print(f"  🔍 SAMプロンプト生成前のquery_embeddings確認:")
        print(f"    - shape: {query_embeddings.shape}")
        print(f"    - dtype: {query_embeddings.dtype}")
        print(f"    - 期待される形状: (batch, 32, 768)")
        
        # 🔍 デバッグ: dtype確認
        print(f"  🔍 デバッグ: enhanced_sam_projector dtype確認")
        print(f"    - query_embeddings dtype: {query_embeddings.dtype}")
        print(f"    - query_embeddings device: {query_embeddings.device}")
        
        # enhanced_sam_projectorの各層のdtypeを確認
        for i, layer in enumerate(self.enhanced_sam_projector):
            if hasattr(layer, 'weight'):
                print(f"    - Layer {i} ({layer.__class__.__name__}) weight dtype: {layer.weight.dtype}")
            elif hasattr(layer, 'normalized_shape'):  # LayerNorm
                print(f"    - Layer {i} (LayerNorm) dtype: {layer.weight.dtype if hasattr(layer, 'weight') else 'N/A'}")
        
        # 🆕 Phase 3C: [SEG]トークン由来のプロンプトを優先使用
        if seg_token_outputs is not None and 'sam_prompt' in seg_token_outputs:
            # [SEG]トークンから生成されたSAMプロンプトを使用
            seg_sam_prompt = seg_token_outputs['sam_prompt']  # (batch, 256)
            
            # 32個のクエリに拡張（各クエリに同じ[SEG]プロンプトを適用）
            seg_sam_prompts = seg_sam_prompt.unsqueeze(1).expand(-1, 32, -1)  # (batch, 32, 256)
            
            # 強化プロジェクターでより高品質なSAMプロンプト生成（Web調査修正: 768→256次元）
            enhanced_sam_prompts = self.enhanced_sam_projector(query_embeddings)  # (batch, 32, 256)
            
            # [SEG]トークンプロンプトと強化プロンプトを融合
            sam_prompts = 0.5 * seg_sam_prompts + 0.5 * enhanced_sam_prompts  # Sa2VA風融合
            
            print(f"  ✅ [SEG]トークン統合SAMプロンプト生成")
            print(f"    - [SEG]プロンプト: 50%")
            print(f"    - 強化プロンプト: 50%")
        else:
            # 通常の処理（[SEG]トークンなし）
            # 強化プロジェクターでより高品質なSAMプロンプト生成（Web調査修正: 768→256次元）
            enhanced_sam_prompts = self.enhanced_sam_projector(query_embeddings)  # (batch, 32, 256)
            
            # 元のQ-Formerプロンプトと融合（アンサンブル効果）（Web調査修正: 32次元統一）
            original_sam_prompts = qformer_outputs['sam_prompts']  # (batch, 32, 256)
            sam_prompts = 0.7 * enhanced_sam_prompts + 0.3 * original_sam_prompts  # 重み付き平均
        
        print(f"  ✅ 高精度Q-Former抽出完了: {sam_prompts.shape}")
        print(f"    - 強化プロンプト: {enhanced_sam_prompts.shape}")
        print(f"    - アンサンブル融合: 70%強化 + 30%標準")
        
        # 4. SAM2: 超高精度セグメンテーション
        print(f"  🎯 SAM2セグメンテーション...")
        
        # 2025年ベストプラクティス: SAM2にデバイス情報を渡す
        base_device = next(self.llama_model.parameters()).device
        self.sam2._target_device = base_device
        
        predicted_masks = []
        
        # デュアルエンコーダーモードでSAM2用画像を選択
        if is_dual_encoder:
            sam_input_images = sam_images  # SAM2専用画像を使用
            print(f"    📸 デュアルエンコーダー: SAM2専用画像使用 {sam_input_images.shape}")
        else:
            sam_input_images = images  # Llama-4画像を使用（シングルエンコーダー）
            print(f"    📸 シングルエンコーダー: Llama-4画像使用 {sam_input_images.shape}")
        
        for batch_idx in range(batch_size):
            # 2025年ベストプラクティス: SAM2用の画像前処理完全版
            image_tensor = sam_input_images[batch_idx].permute(1, 2, 0)  # (H, W, 3)
            
            # BFloat16 → Float32 → uint8変換（Web調査結果ベース）
            if image_tensor.dtype == torch.bfloat16:
                image_tensor = image_tensor.to(torch.float32)
            
            # 正規化されている場合は逆正規化
            if image_tensor.min() < 0 or image_tensor.max() <= 1.0:
                # ImageNet正規化の逆変換
                mean = torch.tensor([0.485, 0.456, 0.406]).view(1, 1, 3).to(image_tensor.device)
                std = torch.tensor([0.229, 0.224, 0.225]).view(1, 1, 3).to(image_tensor.device)
                image_tensor = image_tensor * std + mean
                image_tensor = image_tensor * 255.0
            
            # [0, 255]範囲にクランプしてuint8に変換
            image_tensor = torch.clamp(image_tensor, 0, 255)
            image_np = image_tensor.detach().cpu().numpy().astype('uint8')
            
            batch_prompts = sam_prompts[batch_idx]  # (64, 256)
            
            self.sam2.set_image(image_np)
            
            # 64個のクエリプロンプトでセグメンテーション
            sam_results = self.sam2.predict_with_prompts(
                prompt_embeddings=batch_prompts,
                multimask_output=False  # test script一貫性 + メモリ効率最適化
            )
            
            # 2025年ベストプラクティス: SAM2出力データ型統一
            masks = sam_results['masks']
            
            # SAM2出力の即座データ型変換（Float32 → BFloat16）
            base_dtype = next(self.llama_model.parameters()).dtype
            target_device = next(self.llama_model.parameters()).device
            
            # デバイス・データ型を強制統一
            if masks.dtype != base_dtype or masks.device != target_device:
                original_dtype = masks.dtype
                original_device = masks.device
                masks = masks.to(device=target_device, dtype=base_dtype)
                if batch_idx == 0:  # 初回のみログ出力
                    print(f"    🔄 SAM2出力統一: {original_device}:{original_dtype} → {target_device}:{base_dtype}")
                print(f"    🔍 SAM2出力統計: min={masks.min().item():.6f}, max={masks.max().item():.6f}, mean={masks.mean().item():.6f}")
            
            predicted_masks.append(masks)
        
        predicted_masks = torch.stack(predicted_masks, dim=0)
        
        # 最終データ型統一確認（损失関数エラー防止）
        base_dtype = next(self.llama_model.parameters()).dtype
        target_device = next(self.llama_model.parameters()).device
        if predicted_masks.dtype != base_dtype or predicted_masks.device != target_device:
            print(f"  🔄 最終マスク統一: {predicted_masks.device}:{predicted_masks.dtype} → {target_device}:{base_dtype}")
            predicted_masks = predicted_masks.to(device=target_device, dtype=base_dtype)
            print(f"  🔍 最終predicted_masks統計: min={predicted_masks.min().item():.6f}, max={predicted_masks.max().item():.6f}, mean={predicted_masks.mean().item():.6f}")
            print(f"  🔍 predicted_masks.shape: {predicted_masks.shape}")
        
        # 最終デバイス確認（2025年ベストプラクティス）
        if predicted_masks.device != base_device:
            predicted_masks = predicted_masks.to(base_device)
            print(f"    ⚠️ デバイス補正: {predicted_masks.device} → {base_device}")
        
        print(f"  ✅ 方法3完了: {predicted_masks.shape}")
        
        # text_lossデバッグ
        text_loss = llama_outputs.loss if labels is not None else None
        if text_loss is not None:
            print(f"\n  🔍 text_lossデバッグ:")
            print(f"    - 値: {text_loss}")
            print(f"    - dtype: {text_loss.dtype}")
            print(f"    - NaN: {torch.isnan(text_loss).item()}")
            print(f"    - Inf: {torch.isinf(text_loss).item()}")
            print(f"    - requires_grad: {text_loss.requires_grad}")
            
            # NaNの場合、ゼロに置換（requires_grad=True維持）
            if torch.isnan(text_loss):
                print(f"    ⚠️ text_lossがNaN! ゼロで置換")
                text_loss = torch.tensor(0.0, device=text_loss.device, dtype=text_loss.dtype, requires_grad=True)
                
                # 🔍 追加デバッグ: logitsの詳細分析
                if hasattr(llama_outputs, 'logits'):
                    print(f"    - logits shape: {llama_outputs.logits.shape}")
                    print(f"    - logits dtype: {llama_outputs.logits.dtype}")
                    print(f"    - logits NaN: {torch.isnan(llama_outputs.logits).any().item()}")
                    print(f"    - logits Inf: {torch.isinf(llama_outputs.logits).any().item()}")
                    
                    # 非NaN要素があるか確認
                    valid_mask = ~torch.isnan(llama_outputs.logits)
                    if valid_mask.any():
                        valid_logits = llama_outputs.logits[valid_mask]
                        print(f"    - logits 有効要素数: {valid_mask.sum().item()}")
                        print(f"    - logits 有効範囲: [{valid_logits.min().item():.6f}, {valid_logits.max().item():.6f}]")
                    else:
                        print(f"    - logits 範囲: [全てNaN, 全てNaN]")
                        
                    # 特定位置のlogitsを確認
                    print(f"    - logits NaN位置: {torch.isnan(llama_outputs.logits).any(dim=-1).nonzero()[:5]}...")
                    print(f"    - logits NaN数: {torch.isnan(llama_outputs.logits).sum().item()} / {llama_outputs.logits.numel()}")
                
                # 入力データの分析
                print(f"\n    入力データ分析:")
                print(f"    - input_ids shape: {input_ids.shape}")
                print(f"    - labels shape: {labels.shape if labels is not None else 'None'}")
            
            # llama_outputsの詳細分析
            if hasattr(llama_outputs, 'logits'):
                logits = llama_outputs.logits
                print(f"    - logits shape: {logits.shape}")
                print(f"    - logits dtype: {logits.dtype}")
                # 提案C: CPU-based完全メモリ最適化（GPU VRAM圧迫排除）
                sample_size = 500  # さらに小サンプル化（500要素）
                logits_flat = logits.view(-1)
                sample_indices = torch.randint(0, logits_flat.shape[0], (sample_size,), device='cpu')  # CPUでインデックス生成
                
                # 🎯 最小データのみをCPUに転送（VRAM影響最小化）
                logits_sample_gpu = logits_flat[sample_indices.to(logits.device)]
                logits_sample_cpu = logits_sample_gpu.detach().cpu()  # 最小限データのみCPU転送
                
                # CPUで完全チェック（GPU VRAMへの影響ゼロ）
                logits_nan = torch.isnan(logits_sample_cpu).any().item()
                logits_inf = torch.isinf(logits_sample_cpu).any().item()
                
                print(f"    - logits NaN (sample {sample_size}): {logits_nan}")
                print(f"    - logits Inf (sample {sample_size}): {logits_inf}")
                # CPU-basedで範囲もチェック（メモリ効率化）
                if not logits_nan:
                    # 最小限の統計情報もCPUで計算
                    min_val = logits_sample_cpu.min().item()
                    max_val = logits_sample_cpu.max().item()
                    print(f"    - logits 範囲 (sample): [{min_val:.6f}, {max_val:.6f}]")
                else:
                    print(f"    - logits 範囲: [nan detected in sample]")
                    # NaN詳細はサンプルレベルで実施（メモリ効率化）
                    nan_count = torch.isnan(logits_sample_cpu).sum().item()
                    print(f"    - logits NaN数 (sample): {nan_count} / {sample_size}")
            
            # 入力データの確認
            print(f"\n    入力データ分析:")
            print(f"    - input_ids shape: {input_ids.shape}")
            print(f"    - labels shape: {labels.shape if labels is not None else 'None'}")
            # inputs_embedsはLlama-4内部で生成されるため、ここではチェックできない
        
        outputs = {
            'text_loss': text_loss,
            'predicted_masks': predicted_masks,
            'query_embeddings': query_embeddings,
            'sam_prompts': sam_prompts,
            'method': 'qformer_pure',
            'num_queries': sam_prompts.size(1),
            'llama_logits': logits,  # 🆕 OHEM損失計算用のlogits追加
        }
        
        # 🆕 Phase 2処理結果を追加（MoE負荷分散損失含む）
        if 'phase2_outputs' in locals() and phase2_outputs is not None:
            outputs['phase2_outputs'] = phase2_outputs
            print(f"  ✅ Phase2処理結果をoutputsに追加")
            print(f"    - MoE負荷分散損失: {phase2_outputs['moe_adapted_outputs']['load_balance_loss'].item():.6f}")
        else:
            print(f"  ⚠️ Phase2処理結果が利用できません")
        
        # 🆕 Phase 3C: [SEG]トークン情報を追加
        if seg_token_outputs is not None:
            outputs['seg_token'] = seg_token_outputs['seg_token']
            outputs['seg_sam_prompt'] = seg_token_outputs['sam_prompt']
            if 'attention_weights' in seg_token_outputs:
                outputs['seg_attention_weights'] = seg_token_outputs['attention_weights']
        
        return outputs if return_dict else (outputs['text_loss'], predicted_masks, query_embeddings)


def test_integrated_model():
    """統合モデルテスト"""
    print("=== 統合モデル（Llama4 + Q-Former + SAM2）テスト ===")
    
    try:
        # 統合モデル初期化（Web調査修正: 正しいクラス名）
        model = QFormerSegmentationBridge()
        
        # モデル情報表示
        info = model.get_model_info()
        print(f"\n📊 統合モデル情報:")
        for key, value in info.items():
            if isinstance(value, int) and value > 1000:
                print(f"  - {key}: {value:,}")
            else:
                print(f"  - {key}: {value}")
        
        # テストデータ作成
        batch_size = 1
        images = torch.randint(0, 255, (batch_size, 3, 448, 448), dtype=torch.uint8).float()
        input_text = f"画像内の猫を{model.seg_token}してください"
        
        # テキスト処理
        text_inputs = model.llama_processor.tokenizer(
            input_text,
            return_tensors="pt",
            padding=True,
            truncation=True
        )
        
        print(f"\n🧪 テストデータ:")
        print(f"  - 画像: {images.shape}")
        print(f"  - テキスト: '{input_text}'")
        print(f"  - Input IDs: {text_inputs['input_ids'].shape}")
        
        # フォワードパス実行（推論モード）
        model.eval()
        with torch.no_grad():
            outputs = model(
                images=images,
                input_ids=text_inputs['input_ids'],
                attention_mask=text_inputs['attention_mask'],
                generate_mask=True
            )
        
        print(f"\n📊 結果:")
        print(f"  - Query embeddings: {outputs['query_embeddings'].shape}")
        print(f"  - SAM prompts: {outputs['sam_prompts'].shape}")
        if outputs['predicted_masks'] is not None:
            print(f"  - Predicted masks: {outputs['predicted_masks'].shape}")
        
        print("\n✅ 統合モデルテスト完了")
        
    except Exception as e:
        print(f"❌ 統合モデルテスト失敗: {e}")
        import traceback
        traceback.print_exc()


class LISAUnifiedInterface:
    """
    LISA統一インターフェース
    
    方法3（QFormerSegmentationBridge）をメイン実装として使用
    方法4（LlamaQFormerSAM2Model）はデバッグ用途でのみ利用可能
    """
    
    def __init__(
        self, 
        config: Optional[LlamaQFormerSAM2Config] = None,
        use_method3: bool = True,
        debug_mode: bool = False
    ):
        self.config = config or LlamaQFormerSAM2Config()
        self.use_method3 = use_method3
        self.debug_mode = debug_mode
        
        print("=== LISA統一インターフェース初期化 ===")
        
        if use_method3:
            print("🎯 メイン実装: 方法3 Q-Former純粋セグメンテーション")
            self.model = QFormerSegmentationBridge(config=self.config)
            self.method_name = "Method3_QFormer_Pure"
        else:
            print("🔧 デバッグ実装: 方法4 ハイブリッドセグメンテーション")
            if not debug_mode:
                print("⚠️ 警告: 方法4の本番使用は非推奨です")
            # Web調査修正: 方法4は廃止、方法3に統一
            print("🔄 Web調査修正: 方法4廃止、方法3に統一")
            self.model = QFormerSegmentationBridge(config=self.config, training_stage=2)
            self.method_name = "Method4_Hybrid_Debug"
        
        print(f"✅ 使用方法: {self.method_name}")
    
    def forward(self, images, input_ids, attention_mask=None, labels=None, return_dict=True):
        """統一フォワードインターフェース"""
        if self.debug_mode:
            print(f"🔄 {self.method_name} フォワード実行中...")
        
        return self.model.forward(
            images=images,
            input_ids=input_ids,
            attention_mask=attention_mask,
            labels=labels,
            return_dict=return_dict
        )
    
    def get_model_info(self):
        """モデル情報取得"""
        base_info = {
            'interface_version': 'LISA_Unified_v1.0',
            'active_method': self.method_name,
            'use_method3': self.use_method3,
            'debug_mode': self.debug_mode,
        }
        
        if hasattr(self.model, 'get_model_info'):
            model_info = self.model.get_model_info()
            base_info.update(model_info)
        
        return base_info


def create_lisa_model(
    config: Optional[LlamaQFormerSAM2Config] = None,
    method3_primary: bool = True,
    debug_mode: bool = False
) -> LISAUnifiedInterface:
    """
    LISA統合モデルファクトリー関数
    
    Args:
        config: モデル設定
        method3_primary: True=方法3メイン, False=方法4デバッグ
        debug_mode: デバッグモード有効化
        
    Returns:
        LISAUnifiedInterface: 統一インターフェース
    """
    
    print("🏭 LISA統合モデルファクトリー")
    
    if not method3_primary:
        print("⚠️ 方法4は将来的に廃止予定です")
        print("⚠️ 可能な限り方法3（method3_primary=True）の使用を推奨")
    
    return LISAUnifiedInterface(
        config=config,
        use_method3=method3_primary,
        debug_mode=debug_mode
    )


def test_unified_interface():
    """統一インターフェーステスト"""
    print("=== LISA統一インターフェーステスト ===")
    
    # 方法3（推奨）のテスト
    print("\n1. 方法3（メイン実装）テスト")
    try:
        model_v3 = create_lisa_model(method3_primary=True)
        info_v3 = model_v3.get_model_info()
        
        print(f"✅ 方法3初期化成功")
        print(f"  - アクティブ方法: {info_v3['active_method']}")
        
    except Exception as e:
        print(f"❌ 方法3テスト失敗: {e}")
    
    # 方法4（デバッグ）のテスト
    print("\n2. 方法4（デバッグ実装）テスト")
    try:
        model_v4 = create_lisa_model(method3_primary=False, debug_mode=True)
        info_v4 = model_v4.get_model_info()
        
        print(f"✅ 方法4初期化成功")
        print(f"  - アクティブ方法: {info_v4['active_method']}")
        
    except Exception as e:
        print(f"❌ 方法4テスト失敗: {e}")
    
    print("\n✅ 統一インターフェーステスト完了")


if __name__ == "__main__":
    # 統一インターフェーステストを実行
    test_unified_interface()
    
    # 個別テストも実行（互換性確認）
    print("\n" + "="*50)
    test_integrated_model()