# Core项目ML系统重构实施方案

**文档版本**: v2.2.0
**创建时间**: 2026-02-08
**最后更新**: 2026-02-08
**项目状态**: 🚧 Phase 1 进行中 - FeatureEngine已完成 (20%)

---

## 📋 目录

- [执行概要](#-执行概要)
- [重构背景](#-重构背景)
- [目标架构](#-目标架构)
- [重构范围](#-重构范围)
- [详细设计](#-详细设计)
- [实施计划](#-实施计划)
- [验收标准](#-验收标准)
- [风险管理](#-风险管理)
- [参考资料](#-参考资料)

---

## 📊 执行概要

### 项目定位
这是一个**开发初期的重构项目**，可以大胆重新设计架构，无需考虑向后兼容性。

### 重构目标
1. **完全对齐ML文档**: 实现[ml/README.md](../ml/README.md)描述的理想架构
2. **删除旧的三层架构**: `strategies/three_layer/`全部删除
3. **建立新的ML系统**: 从零开始构建符合文档的ML工作流
4. **保持高代码质量**: 90%+测试覆盖率，生产级标准

### 实施周期
- **Phase 1**: 核心ML模块实现 (2周)
- **Phase 2**: 回测集成与工具链 (1周)
- **Phase 3**: 测试与文档完善 (1周)
- **总计**: 4周

### 关键原则
- ✅ **大胆重构**: 不考虑旧代码兼容性
- ✅ **对齐文档**: 严格按照ML文档设计
- ✅ **高质量**: 测试先行，文档完整
- ❌ **不保留**: 三层架构完全删除

---

## 🎯 重构背景

### 1.1 为什么要重构

当前项目处于**开发初期阶段**，这是进行架构调整的最佳时机：

1. **ML系统组件分散**: 特征、标签、模型功能分散在多个模块
2. **存在冗余架构**: `strategies/three_layer/`与ML文档设计不一致
3. **接口不统一**: 缺少标准化的ML工作流接口
4. **文档与代码脱节**: 实现与文档描述有较大差异

### 1.2 重构价值

- **统一架构**: 建立标准的ML工作流，从训练到预测一站式
- **降低复杂度**: 删除冗余模块，简化系统结构
- **提升可维护性**: 职责清晰，模块独立，便于测试
- **便于协作**: 代码与文档完全一致，降低学习成本

---

## 🏗️ 目标架构

### 2.1 ML系统架构图

```
┌─────────────────────────────────────────────────────────┐
│                    ML 系统完整架构                        │
└─────────────────────────────────────────────────────────┘

┌─────────────────────────────────────────────────────────┐
│  阶段 1: 数据准备与特征工程                               │
├─────────────────────────────────────────────────────────┤
│  Input:  [股票池] + [历史行情数据]                       │
│  ↓                                                        │
│  FeatureEngine.calculate_features()                      │
│  ├─ AlphaFactors: 125+ Alpha因子                        │
│  ├─ TechnicalIndicators: 60+ 技术指标                   │
│  ├─ VolumeFeatures: 成交量特征                          │
│  └─ FeatureTransformer: 特征预处理                      │
│  ↓                                                        │
│  Output: [特征矩阵] (N stocks × 125+ features)          │
└─────────────────────────────────────────────────────────┘
                          ↓
┌─────────────────────────────────────────────────────────┐
│  阶段 2: 标签生成与模型训练                               │
├─────────────────────────────────────────────────────────┤
│  LabelGenerator.generate_labels()                       │
│  ├─ 未来收益率计算 (forward_window)                     │
│  ├─ 标签类型: return/direction/classification           │
│  └─ 多时间窗口标签                                       │
│  ↓                                                        │
│  ModelTrainer.train()                                    │
│  ├─ 模型选择: LightGBM / XGBoost / Neural Net          │
│  ├─ 超参数优化: Optuna / Grid Search                    │
│  ├─ 交叉验证: TimeSeriesSplit                           │
│  └─ 模型评估: IC / Rank IC / 分组回测                   │
│  ↓                                                        │
│  Output: TrainedModel (model + feature_engine)          │
└─────────────────────────────────────────────────────────┘
                          ↓
┌─────────────────────────────────────────────────────────┐
│  阶段 3: 交易信号生成 (回测/实盘)                         │
├─────────────────────────────────────────────────────────┤
│  MLEntry.generate_signals(stock_pool, date)             │
│  ├─ 1. 计算当日特征 (FeatureEngine)                     │
│  ├─ 2. 模型预测 (expected_return + confidence)          │
│  ├─ 3. 信号筛选 (置信度过滤 + Top N)                     │
│  ├─ 4. 权重计算 (sharpe × confidence)                   │
│  └─ 5. 归一化权重                                        │
│  ↓                                                        │
│  Output: [交易信号]                                      │
│          {'stock': {'action': 'long/short', 'weight': 0.xx}}│
└─────────────────────────────────────────────────────────┘
                          ↓
┌─────────────────────────────────────────────────────────┐
│  阶段 4: 回测执行                                         │
├─────────────────────────────────────────────────────────┤
│  BacktestEngine.run()                                    │
│  ├─ 每日调用 MLEntry.generate_signals()                 │
│  ├─ 执行交易、计算收益                                   │
│  └─ 生成绩效报告                                         │
└─────────────────────────────────────────────────────────┘
```

### 2.2 核心组件设计

| 组件 | 职责 | 关键接口 |
|------|------|----------|
| **FeatureEngine** | 特征计算引擎 | `calculate_features(stock_codes, market_data, date)` |
| **LabelGenerator** | 标签生成器 | `generate_labels(stock_codes, market_data, date)` |
| **ModelTrainer** | 模型训练器 | `train(stock_pool, market_data)` |
| **TrainedModel** | 训练好的模型 | `predict(stock_codes, market_data, date)` |
| **MLEntry** | ML入场策略 | `generate_signals(stock_pool, market_data, date)` |
| **MLStockRanker** | 股票评分工具 | `rank(stock_pool, market_data, date, top_n)` |

---

## 🔨 重构范围

### 3.1 删除的模块

以下模块将**完全删除**:

```
core/src/strategies/three_layer/          # 删除整个目录
├── base/
│   ├── stock_selector.py                 # ❌ 删除
│   ├── entry_strategy.py                 # ❌ 删除
│   ├── exit_strategy.py                  # ❌ 删除
│   └── strategy_composer.py              # ❌ 删除
├── selectors/
│   ├── ml_selector.py                    # ❌ 删除 (替换为MLStockRanker)
│   ├── momentum_selector.py              # ❌ 删除
│   ├── value_selector.py                 # ❌ 删除
│   └── external_selector.py              # ❌ 删除
├── entries/
│   ├── immediate_entry.py                # ❌ 删除
│   ├── ma_breakout_entry.py              # ❌ 删除
│   └── rsi_oversold_entry.py             # ❌ 删除
└── exits/
    ├── fixed_stop_loss_exit.py           # ❌ 删除
    ├── atr_stop_loss_exit.py             # ❌ 删除
    ├── time_based_exit.py                # ❌ 删除
    └── combined_exit.py                  # ❌ 删除

core/src/strategies/ml_strategy.py         # ❌ 删除 (替换为MLEntry)
core/tests/unit/strategies/three_layer/    # ❌ 删除相关测试
```

**删除理由**:
1. 三层架构与ML文档设计不一致
2. 增加了不必要的复杂度
3. `ml_selector.py`功能被`MLStockRanker`替代
4. 项目处于初期，可以大胆调整

### 3.2 新增的模块

创建全新的ML模块:

```
core/src/ml/                              # 新增: ML核心模块
├── __init__.py
├── feature_engine.py                     # ✅ 新增: 统一特征引擎
├── label_generator.py                    # ✅ 新增: 标签生成器
├── trained_model.py                      # ✅ 新增: 训练模型包装类
├── ml_entry.py                          # ✅ 新增: ML入场策略
└── ml_stock_ranker.py                   # ✅ 新增: 股票评分工具

core/tests/unit/ml/                       # 新增: ML模块测试
├── __init__.py
├── test_feature_engine.py
├── test_label_generator.py
├── test_trained_model.py
├── test_ml_entry.py
└── test_ml_stock_ranker.py

core/examples/                            # 新增: 示例代码
├── train_ml_model.py                    # 模型训练示例
├── backtest_ml_strategy.py              # ML策略回测示例
└── ml_stock_ranker_demo.py              # 股票评分示例
```

### 3.3 修改的模块

以下模块需要**调整**以适配新架构:

```
core/src/models/model_trainer.py          # 修改: 使用TrainingConfig
core/src/models/model_evaluator.py        # 修改: 添加IC/Rank IC
core/src/backtest/backtest_engine.py      # 修改: 支持MLEntry策略
core/docs/ml/README.md                    # 更新: 添加实现说明
```

### 3.4 保留的模块

以下核心模块**保持不变**:

```
core/src/features/
├── alpha_factors.py                      # ✅ 保留 (被FeatureEngine调用)
├── technical_indicators.py               # ✅ 保留 (被FeatureEngine调用)
├── feature_transformer.py                # ✅ 保留 (被FeatureEngine调用)
└── streaming_feature_engine.py           # ✅ 保留 (大规模计算使用)

core/src/models/
├── lightgbm_model.py                     # ✅ 保留
├── gru_model.py                          # ✅ 保留
├── ridge_model.py                        # ✅ 保留
└── ensemble.py                           # ✅ 保留

core/src/backtest/                        # ✅ 保留 (核心回测引擎)
core/src/data/                            # ✅ 保留 (数据处理)
core/src/providers/                       # ✅ 保留 (数据源)
```

---

## 🔧 详细设计

### 4.1 FeatureEngine - 特征工程引擎

#### 设计理念
统一封装所有特征计算逻辑，提供简洁的API接口。

#### 文件位置
```
core/src/ml/feature_engine.py
```

#### 完整实现

```python
"""
特征工程引擎 - 统一接口
对齐文档: core/docs/ml/README.md (阶段1)
"""
from typing import List, Dict, Optional
import pandas as pd
import numpy as np

from core.src.features.alpha_factors import AlphaFactors
from core.src.features.technical_indicators import TechnicalIndicators
from core.src.features.feature_transformer import FeatureTransformer


class FeatureEngine:
    """
    特征工程引擎

    职责:
    - 计算125+ Alpha因子
    - 计算60+ 技术指标
    - 特征转换与预处理

    使用示例:
        >>> engine = FeatureEngine(
        ...     feature_groups=['alpha', 'technical'],
        ...     lookback_window=60
        ... )
        >>> features = engine.calculate_features(
        ...     stock_codes=['600000.SH', '000001.SZ'],
        ...     market_data=data,
        ...     date='2024-01-15'
        ... )
    """

    def __init__(
        self,
        feature_groups: Optional[List[str]] = None,
        lookback_window: int = 60,
        cache_enabled: bool = True
    ):
        """
        初始化特征引擎

        Args:
            feature_groups: 特征组列表
                - 'alpha': Alpha因子
                - 'technical': 技术指标
                - 'volume': 成交量特征
                - 'all': 所有特征
            lookback_window: 回溯窗口(天数)
            cache_enabled: 是否启用缓存
        """
        self.feature_groups = feature_groups or ['all']
        self.lookback_window = lookback_window
        self.cache_enabled = cache_enabled

        # 初始化底层模块
        self._alpha_factors = AlphaFactors()
        self._technical_indicators = TechnicalIndicators()
        self._feature_transformer = FeatureTransformer()

        # 缓存
        self._cache: Dict[str, pd.DataFrame] = {} if cache_enabled else None

    def calculate_features(
        self,
        stock_codes: List[str],
        market_data: pd.DataFrame,
        date: str
    ) -> pd.DataFrame:
        """
        计算特征矩阵

        Args:
            stock_codes: 股票代码列表
            market_data: 市场数据 (包含OHLCV)
            date: 计算日期

        Returns:
            pd.DataFrame: 特征矩阵
                - index: stock_codes
                - columns: feature_names (125+)
        """
        # 1. 检查缓存
        cache_key = f"{date}_{hash(tuple(sorted(stock_codes)))}"
        if self.cache_enabled and cache_key in self._cache:
            return self._cache[cache_key].copy()

        # 2. 准备数据
        end_date = pd.to_datetime(date)
        start_date = end_date - pd.Timedelta(days=self.lookback_window + 60)

        data_slice = market_data[
            (market_data['date'] >= start_date) &
            (market_data['date'] <= end_date) &
            (market_data['stock_code'].isin(stock_codes))
        ].copy()

        if len(data_slice) == 0:
            raise ValueError(f"No data found for date {date}")

        # 3. 计算特征
        features = pd.DataFrame(index=stock_codes)

        if self._should_include('alpha'):
            alpha_features = self._calculate_alpha_features(
                stock_codes, data_slice, date
            )
            features = pd.concat([features, alpha_features], axis=1)

        if self._should_include('technical'):
            tech_features = self._calculate_technical_features(
                stock_codes, data_slice, date
            )
            features = pd.concat([features, tech_features], axis=1)

        if self._should_include('volume'):
            volume_features = self._calculate_volume_features(
                stock_codes, data_slice, date
            )
            features = pd.concat([features, volume_features], axis=1)

        # 4. 特征转换
        features = self._feature_transformer.transform(features)

        # 5. 缓存
        if self.cache_enabled:
            self._cache[cache_key] = features.copy()

        return features

    def _should_include(self, group: str) -> bool:
        """判断是否包含特征组"""
        return 'all' in self.feature_groups or group in self.feature_groups

    def _calculate_alpha_features(
        self,
        stock_codes: List[str],
        data: pd.DataFrame,
        date: str
    ) -> pd.DataFrame:
        """计算Alpha因子"""
        # 调用AlphaFactors计算
        result = self._alpha_factors.calculate_batch(
            stock_codes=stock_codes,
            market_data=data,
            date=date
        )
        return result

    def _calculate_technical_features(
        self,
        stock_codes: List[str],
        data: pd.DataFrame,
        date: str
    ) -> pd.DataFrame:
        """计算技术指标"""
        # 调用TechnicalIndicators计算
        result = self._technical_indicators.calculate_batch(
            stock_codes=stock_codes,
            market_data=data,
            date=date
        )
        return result

    def _calculate_volume_features(
        self,
        stock_codes: List[str],
        data: pd.DataFrame,
        date: str
    ) -> pd.DataFrame:
        """计算成交量特征"""
        # 成交量相关特征
        result = pd.DataFrame(index=stock_codes)

        for stock in stock_codes:
            stock_data = data[data['stock_code'] == stock]
            if len(stock_data) < 20:
                continue

            # 成交量比率
            result.loc[stock, 'volume_ratio_5d'] = self._volume_ratio(
                stock_data, window=5
            )
            result.loc[stock, 'volume_ratio_10d'] = self._volume_ratio(
                stock_data, window=10
            )
            result.loc[stock, 'volume_ratio_20d'] = self._volume_ratio(
                stock_data, window=20
            )

        return result

    def _volume_ratio(self, data: pd.DataFrame, window: int) -> float:
        """计算成交量比率"""
        if len(data) < window + 1:
            return np.nan

        recent_volume = data.iloc[-1]['volume']
        avg_volume = data.iloc[-window-1:-1]['volume'].mean()

        if avg_volume == 0:
            return np.nan

        return recent_volume / avg_volume

    def clear_cache(self):
        """清空缓存"""
        if self.cache_enabled:
            self._cache.clear()
```

---

### 4.2 LabelGenerator - 标签生成器

#### 设计理念
独立的标签生成模块，支持多种标签策略。

#### 文件位置
```
core/src/ml/label_generator.py
```

#### 完整实现

```python
"""
标签生成器
对齐文档: core/docs/ml/README.md (阶段2)
"""
from typing import List, Literal
import pandas as pd
import numpy as np


LabelType = Literal['return', 'direction', 'classification', 'regression']


class LabelGenerator:
    """
    标签生成器

    支持多种标签类型:
    - 'return': 未来收益率 (回归任务)
    - 'direction': 涨跌方向 (二分类)
    - 'classification': 多分类 (涨/平/跌)
    - 'regression': 标准化收益率

    使用示例:
        >>> generator = LabelGenerator(
        ...     forward_window=5,
        ...     label_type='return'
        ... )
        >>> labels = generator.generate_labels(
        ...     stock_codes=['600000.SH', '000001.SZ'],
        ...     market_data=data,
        ...     date='2024-01-15'
        ... )
    """

    def __init__(
        self,
        forward_window: int = 5,
        label_type: LabelType = 'return',
        classification_thresholds: tuple = (-0.02, 0.02)
    ):
        """
        初始化标签生成器

        Args:
            forward_window: 前向窗口(天数)
            label_type: 标签类型
            classification_thresholds: 分类阈值 (下跌, 上涨)
        """
        self.forward_window = forward_window
        self.label_type = label_type
        self.classification_thresholds = classification_thresholds

    def generate_labels(
        self,
        stock_codes: List[str],
        market_data: pd.DataFrame,
        date: str
    ) -> pd.Series:
        """
        生成标签

        Args:
            stock_codes: 股票代码列表
            market_data: 市场数据
            date: 计算日期

        Returns:
            pd.Series: 标签序列
                - index: stock_codes
                - values: 标签值
        """
        labels = {}

        for stock in stock_codes:
            stock_data = market_data[
                market_data['stock_code'] == stock
            ].sort_values('date').reset_index(drop=True)

            # 找到当前日期
            current_mask = stock_data['date'] == pd.to_datetime(date)
            if not current_mask.any():
                continue

            current_idx = stock_data[current_mask].index[0]
            future_idx = current_idx + self.forward_window

            if future_idx >= len(stock_data):
                continue

            # 计算收益率
            current_price = stock_data.loc[current_idx, 'close']
            future_price = stock_data.loc[future_idx, 'close']

            if current_price == 0:
                continue

            return_value = (future_price - current_price) / current_price
            label = self._convert_label(return_value)
            labels[stock] = label

        return pd.Series(labels, name='label')

    def _convert_label(self, return_value: float) -> float:
        """将收益率转换为标签"""
        if self.label_type == 'return':
            return return_value

        elif self.label_type == 'direction':
            return 1.0 if return_value > 0 else 0.0

        elif self.label_type == 'classification':
            lower, upper = self.classification_thresholds
            if return_value < lower:
                return 0.0  # 下跌
            elif return_value > upper:
                return 2.0  # 上涨
            else:
                return 1.0  # 横盘

        elif self.label_type == 'regression':
            return return_value

        else:
            raise ValueError(f"Unknown label_type: {self.label_type}")

    def generate_multi_horizon_labels(
        self,
        stock_codes: List[str],
        market_data: pd.DataFrame,
        date: str,
        horizons: List[int] = [1, 3, 5, 10, 20]
    ) -> pd.DataFrame:
        """
        生成多个时间窗口的标签

        Args:
            stock_codes: 股票代码列表
            market_data: 市场数据
            date: 计算日期
            horizons: 时间窗口列表

        Returns:
            pd.DataFrame: 多窗口标签
                columns: ['label_1d', 'label_3d', 'label_5d', ...]
        """
        result = pd.DataFrame(index=stock_codes)

        for horizon in horizons:
            temp_gen = LabelGenerator(
                forward_window=horizon,
                label_type=self.label_type,
                classification_thresholds=self.classification_thresholds
            )

            labels = temp_gen.generate_labels(
                stock_codes, market_data, date
            )
            result[f'label_{horizon}d'] = labels

        return result
```

---

### 4.3 TrainedModel - 训练好的模型

#### 设计理念
封装模型+特征引擎，提供统一预测接口。

#### 文件位置
```
core/src/ml/trained_model.py
```

#### 完整实现

```python
"""
训练好的模型包装类
对齐文档: core/docs/ml/README.md (阶段2)
"""
from typing import List, Dict, Any, Optional
from dataclasses import dataclass, field
import pandas as pd
import numpy as np
import joblib
from pathlib import Path

from core.src.ml.feature_engine import FeatureEngine


@dataclass
class TrainingConfig:
    """训练配置"""
    model_type: str = 'lightgbm'
    train_start_date: str = '2020-01-01'
    train_end_date: str = '2023-12-31'
    validation_split: float = 0.2
    forward_window: int = 5
    feature_groups: List[str] = field(default_factory=lambda: ['all'])
    hyperparameters: Optional[Dict[str, Any]] = None


class TrainedModel:
    """
    训练好的模型 (可保存和加载)

    封装:
    - model: 训练好的ML模型
    - feature_engine: 特征引擎
    - config: 训练配置
    - metrics: 评估指标

    使用示例:
        >>> # 训练后保存
        >>> model = TrainedModel(
        ...     model=lgb_model,
        ...     feature_engine=engine,
        ...     config=config,
        ...     metrics={'ic': 0.08}
        ... )
        >>> model.save('models/my_model.pkl')

        >>> # 加载后预测
        >>> model = TrainedModel.load('models/my_model.pkl')
        >>> predictions = model.predict(
        ...     stock_codes=['600000.SH'],
        ...     market_data=data,
        ...     date='2024-01-15'
        ... )
    """

    def __init__(
        self,
        model: Any,
        feature_engine: FeatureEngine,
        config: TrainingConfig,
        metrics: Dict[str, float]
    ):
        """
        初始化

        Args:
            model: 训练好的模型实例
            feature_engine: 特征引擎
            config: 训练配置
            metrics: 评估指标
        """
        self.model = model
        self.feature_engine = feature_engine
        self.config = config
        self.metrics = metrics

        # 特征列名
        self.feature_columns: Optional[List[str]] = None

    def predict(
        self,
        stock_codes: List[str],
        market_data: pd.DataFrame,
        date: str
    ) -> pd.DataFrame:
        """
        预测

        Args:
            stock_codes: 股票代码列表
            market_data: 市场数据
            date: 预测日期

        Returns:
            pd.DataFrame:
                columns: ['expected_return', 'volatility', 'confidence']
                index: stock_codes
        """
        # 1. 计算特征
        features = self.feature_engine.calculate_features(
            stock_codes, market_data, date
        )

        # 2. 数据清洗
        features = features.fillna(0).replace([np.inf, -np.inf], 0)

        # 3. 对齐特征列
        if self.feature_columns is not None:
            missing_cols = set(self.feature_columns) - set(features.columns)
            for col in missing_cols:
                features[col] = 0
            features = features[self.feature_columns]

        # 4. 模型预测
        predictions = self.model.predict(features.values)

        # 5. 构建结果
        result = pd.DataFrame(index=features.index)
        result['expected_return'] = predictions
        result['volatility'] = self._estimate_volatility(
            stock_codes, market_data, date
        )
        result['confidence'] = self._estimate_confidence(features)

        return result

    def _estimate_volatility(
        self,
        stock_codes: List[str],
        market_data: pd.DataFrame,
        date: str,
        window: int = 20
    ) -> pd.Series:
        """估计波动率"""
        volatilities = {}
        end_date = pd.to_datetime(date)
        start_date = end_date - pd.Timedelta(days=window + 10)

        for stock in stock_codes:
            stock_data = market_data[
                (market_data['stock_code'] == stock) &
                (market_data['date'] >= start_date) &
                (market_data['date'] <= end_date)
            ].sort_values('date')

            if len(stock_data) < window:
                volatilities[stock] = 0.02
                continue

            returns = stock_data['close'].pct_change().dropna()
            volatilities[stock] = returns.std()

        return pd.Series(volatilities)

    def _estimate_confidence(
        self,
        features: pd.DataFrame
    ) -> pd.Series:
        """估计置信度"""
        # 简单方法: 基于特征完整度
        completeness = 1.0 - features.isna().sum(axis=1) / len(features.columns)
        return completeness.clip(0.5, 1.0)

    def save(self, path: str):
        """保存模型"""
        save_path = Path(path)
        save_path.parent.mkdir(parents=True, exist_ok=True)
        joblib.dump(self, path)
        print(f"✅ 模型已保存: {path}")

    @staticmethod
    def load(path: str) -> 'TrainedModel':
        """加载模型"""
        if not Path(path).exists():
            raise FileNotFoundError(f"模型不存在: {path}")

        model = joblib.load(path)
        print(f"✅ 模型已加载: {path}")
        print(f"   模型类型: {model.config.model_type}")
        print(f"   IC: {model.metrics.get('ic', 'N/A'):.4f}")

        return model
```

---

### 4.4 MLEntry - ML入场策略

#### 设计理念
使用训练好的模型生成交易信号。

#### 文件位置
```
core/src/ml/ml_entry.py
```

#### 完整实现

```python
"""
ML入场策略
对齐文档: core/docs/ml/README.md (阶段3)
"""
from typing import List, Dict
import pandas as pd

from core.src.ml.trained_model import TrainedModel


class MLEntry:
    """
    机器学习入场策略

    工作流程:
    1. 模型预测 → expected_return + confidence
    2. 筛选做多候选 (expected_return > 0 & confidence > threshold)
    3. 筛选做空候选 (expected_return < 0 & confidence > threshold)
    4. 计算权重 (sharpe × confidence)
    5. 归一化权重

    使用示例:
        >>> strategy = MLEntry(
        ...     model_path='models/ml_model.pkl',
        ...     confidence_threshold=0.7,
        ...     top_long=20,
        ...     top_short=10
        ... )
        >>> signals = strategy.generate_signals(
        ...     stock_pool=['600000.SH', '000001.SZ'],
        ...     market_data=data,
        ...     date='2024-01-15'
        ... )
    """

    def __init__(
        self,
        model_path: str,
        confidence_threshold: float = 0.7,
        top_long: int = 20,
        top_short: int = 10,
        enable_short: bool = False
    ):
        """
        初始化

        Args:
            model_path: 模型路径
            confidence_threshold: 置信度阈值
            top_long: 做多数量
            top_short: 做空数量
            enable_short: 是否启用做空
        """
        self.model: TrainedModel = TrainedModel.load(model_path)
        self.confidence_threshold = confidence_threshold
        self.top_long = top_long
        self.top_short = top_short
        self.enable_short = enable_short

    def generate_signals(
        self,
        stock_pool: List[str],
        market_data: pd.DataFrame,
        date: str
    ) -> Dict[str, Dict]:
        """
        生成入场信号

        Args:
            stock_pool: 股票池
            market_data: 市场数据
            date: 交易日期

        Returns:
            Dict[str, Dict]:
                {
                    'stock_code': {
                        'action': 'long' or 'short',
                        'weight': 0.xx
                    }
                }
        """
        # 1. 模型预测
        predictions = self.model.predict(stock_pool, market_data, date)

        # 2. 筛选做多候选
        long_candidates = predictions[
            (predictions['expected_return'] > 0) &
            (predictions['confidence'] > self.confidence_threshold)
        ].copy()

        # 计算做多权重
        long_candidates['sharpe'] = (
            long_candidates['expected_return'] / long_candidates['volatility']
        )
        long_candidates['weight'] = (
            long_candidates['sharpe'] * long_candidates['confidence']
        )
        long_candidates = long_candidates.nlargest(self.top_long, 'weight')

        # 3. 筛选做空候选
        short_candidates = pd.DataFrame()
        if self.enable_short and self.top_short > 0:
            short_candidates = predictions[
                (predictions['expected_return'] < 0) &
                (predictions['confidence'] > self.confidence_threshold)
            ].copy()

            short_candidates['sharpe'] = (
                abs(short_candidates['expected_return']) /
                short_candidates['volatility']
            )
            short_candidates['weight'] = (
                short_candidates['sharpe'] * short_candidates['confidence']
            )
            short_candidates = short_candidates.nlargest(
                self.top_short, 'weight'
            )

        # 4. 合并信号
        signals = {}

        for stock, row in long_candidates.iterrows():
            signals[stock] = {
                'action': 'long',
                'weight': row['weight']
            }

        for stock, row in short_candidates.iterrows():
            signals[stock] = {
                'action': 'short',
                'weight': row['weight']
            }

        # 5. 归一化权重
        total_weight = sum(s['weight'] for s in signals.values())
        if total_weight > 0:
            for stock in signals:
                signals[stock]['weight'] /= total_weight

        return signals
```

---

### 4.5 MLStockRanker - 股票评分工具

#### 设计理念
辅助工具,用于筛选高潜力股票池。

#### 文件位置
```
core/src/ml/ml_stock_ranker.py
```

#### 完整实现

```python
"""
ML股票评分排名工具
对齐文档: core/docs/ml/mlstockranker.md
"""
from typing import List, Dict
import pandas as pd

from core.src.ml.trained_model import TrainedModel


class MLStockRanker:
    """
    ML股票评分排名工具

    用于从大股票池中筛选高潜力股票。

    使用示例:
        >>> ranker = MLStockRanker(
        ...     model_path='models/ranker.pkl'
        ... )
        >>> rankings = ranker.rank(
        ...     stock_pool=all_a_stocks,  # 3000+
        ...     market_data=data,
        ...     date='2024-01-01',
        ...     return_top_n=100
        ... )
    """

    def __init__(self, model_path: str):
        """
        初始化

        Args:
            model_path: 模型路径
        """
        self.model: TrainedModel = TrainedModel.load(model_path)

    def rank(
        self,
        stock_pool: List[str],
        market_data: pd.DataFrame,
        date: str,
        return_top_n: int = 100
    ) -> Dict[str, float]:
        """
        对股票池进行评分排名

        Args:
            stock_pool: 股票池
            market_data: 市场数据
            date: 评分日期
            return_top_n: 返回Top N

        Returns:
            Dict[str, float]: {stock_code: score}
        """
        # 1. 模型预测
        predictions = self.model.predict(stock_pool, market_data, date)

        # 2. 计算综合评分
        predictions['score'] = (
            predictions['expected_return'] *
            predictions['confidence']
        )

        # 3. 排序
        predictions = predictions.sort_values('score', ascending=False)

        # 4. 返回Top N
        top_stocks = predictions.head(return_top_n)

        return top_stocks['score'].to_dict()
```

---

## 📅 实施计划

### Phase 1: 核心ML模块实现 (Week 1-2)

| 日期 | 任务 | 交付物 | 优先级 | 状态 |
|------|------|--------|--------|------|
| Day 1 | **删除旧模块** | 删除`strategies/three_layer/`<br>删除`strategies/ml_strategy.py` | 🔴 P0 | ✅ 完成 |
| Day 2-3 | **实现FeatureEngine** | `ml/feature_engine.py` + 单元测试 | 🔴 P0 | ✅ 完成 |
| Day 4 | **实现LabelGenerator** | `ml/label_generator.py` + 单元测试 | 🔴 P0 | 📝 待实现 |
| Day 5-6 | **实现TrainedModel** | `ml/trained_model.py` + 单元测试 | 🔴 P0 | 📝 待实现 |
| Day 7-8 | **实现MLEntry** | `ml/ml_entry.py` + 单元测试 | 🔴 P0 | 📝 待实现 |
| Day 9 | **实现MLStockRanker** | `ml/ml_stock_ranker.py` + 单元测试 | 🟡 P1 | 📝 待实现 |
| Day 10 | **集成测试** | 端到端测试通过 | 🔴 P0 | 📝 待实现 |

**里程碑 1**: 核心ML模块完成,测试通过 ⏳ 进行中 (20% 完成)

### Phase 2: 回测集成与工具链 (Week 3)

| 日期 | 任务 | 交付物 | 优先级 |
|------|------|--------|--------|
| Day 11 | **调整ModelTrainer** | 使用TrainingConfig | 🟡 P1 |
| Day 12 | **增强模型评估** | IC/Rank IC计算 | 🟡 P1 |
| Day 13-14 | **回测引擎集成** | BacktestEngine支持MLEntry | 🔴 P0 |
| Day 15 | **创建示例代码** | 3个完整示例 | 🟡 P1 |

**里程碑 2**: 回测集成完成

### Phase 3: 测试与文档完善 (Week 4)

| 日期 | 任务 | 交付物 | 优先级 |
|------|------|--------|--------|
| Day 16-17 | **端到端测试** | 完整工作流测试 | 🔴 P0 |
| Day 18-19 | **文档更新** | 更新ml/README.md<br>编写使用指南 | 🔴 P0 |
| Day 20 | **Code Review** | 代码审查和优化 | 🟡 P1 |

**里程碑 3**: 项目完成,文档齐全

---

## ✅ 验收标准

### 功能验收

#### 必须项 (P0)

- [x] 旧的三层架构已完全删除 ✅ (2026-02-08)
- [x] `FeatureEngine`可计算Alpha因子 + 技术指标 ✅ (2026-02-08, 58+37+4=99特征)
- [ ] `LabelGenerator`支持4种标签类型
- [ ] `TrainedModel`可保存/加载,提供预测接口
- [ ] `MLEntry`生成符合文档的交易信号
- [x] `FeatureEngine`单元测试覆盖率 >= 90% ✅ (2026-02-08, 100%)
- [ ] 所有模块单元测试覆盖率 >= 90%
- [ ] 端到端测试通过(训练→预测→回测)
- [ ] 接口命名与ML文档完全一致

#### 期望项 (P1)

- [ ] `MLStockRanker`提供股票评分功能
- [ ] 模型评估支持IC/Rank IC
- [ ] 提供至少3个完整示例
- [ ] API文档完整

### 性能验收

| 操作 | 数据规模 | 性能目标 |
|------|----------|----------|
| 特征计算 | 100股×125特征 | < 5秒 |
| 模型预测 | 100股 | < 1秒 |
| 回测 | 50股×250天 | < 15秒 |

### 代码质量验收

- [ ] 所有代码通过PEP 8检查
- [ ] 所有公共接口有完整docstring (Google Style)
- [ ] 类型提示覆盖率 >= 95%
- [ ] 无critical级别告警

### 文档验收

- [ ] 每个模块有完整API文档
- [ ] 更新`core/docs/ml/README.md`
- [ ] 提供使用指南和示例
- [ ] 更新CHANGELOG

---

## 🚨 风险管理

### 技术风险

| 风险 | 等级 | 影响 | 缓解措施 |
|------|------|------|----------|
| 删除旧代码引入Bug | 🟡 中 | 功能缺失 | 充分测试,分步删除 |
| 性能回归 | 🟡 中 | 回测变慢 | 性能基准测试 |
| 接口设计不合理 | 🔴 高 | 返工成本高 | 设计Review,小步迭代 |
| 测试覆盖不足 | 🟡 中 | 潜在Bug | 严格要求90%覆盖率 |

### 项目风险

| 风险 | 等级 | 影响 | 缓解措施 |
|------|------|------|----------|
| 时间延期 | 🟡 中 | 交付延迟 | 优先P0任务 |
| 需求变更 | 🟢 低 | 返工 | 需求冻结 |

### 风险监控

**每周检查点**:
- 代码完成度
- 测试覆盖率
- 性能基准
- 接口一致性

---

## 📚 参考资料

### 核心文档

1. **ML系统文档**
   - [ML系统完整指南](../ml/README.md) ⭐ 核心参考
   - [MLStockRanker文档](../ml/mlstockranker.md)
   - [评估指标详解](../ml/evaluation-metrics.md)

2. **架构文档**
   - [架构总览](../architecture/overview.md)
   - [设计模式](../architecture/design_patterns.md)

### 保留模块参考

1. **特征工程** (保留,被FeatureEngine调用)
   - [features/alpha_factors.py](../../src/features/alpha_factors.py)
   - [features/technical_indicators.py](../../src/features/technical_indicators.py)

2. **模型训练** (保留,需调整)
   - [models/model_trainer.py](../../src/models/model_trainer.py)
   - [models/lightgbm_model.py](../../src/models/lightgbm_model.py)

---

## 📝 附录

### A. 目录结构变化

**删除**:
```
core/src/strategies/three_layer/          ❌ 完全删除
core/src/strategies/ml_strategy.py         ❌ 删除
core/tests/unit/strategies/three_layer/    ❌ 删除
```

**新增**:
```
core/src/ml/                              ✅ 新建
├── __init__.py
├── feature_engine.py
├── label_generator.py
├── trained_model.py
├── ml_entry.py
└── ml_stock_ranker.py

core/tests/unit/ml/                       ✅ 新建
├── __init__.py
├── test_feature_engine.py
├── test_label_generator.py
├── test_trained_model.py
├── test_ml_entry.py
└── test_ml_stock_ranker.py

core/examples/                            ✅ 新建
├── train_ml_model.py
├── backtest_ml_strategy.py
└── ml_stock_ranker_demo.py
```

### B. 架构对比

**旧架构** (删除):
```
strategies/three_layer/
├── selectors/     # 选股器
├── entries/       # 入场策略
└── exits/         # 退出策略
```

**新架构**:
```
ml/
├── FeatureEngine     # 特征计算
├── LabelGenerator    # 标签生成
├── ModelTrainer      # 模型训练
├── TrainedModel      # 训练好的模型
├── MLEntry           # ML入场策略
└── MLStockRanker     # 股票评分工具
```

---

**文档版本**: v2.2.0
**创建时间**: 2026-02-08
**最后更新**: 2026-02-08
**项目状态**: 🚧 Phase 1 Day 2-3 完成 - FeatureEngine实现完成

---

## 📝 实施日志

### 2026-02-08 - Phase 1 Day 1 完成 ✅

**已删除的模块**:
- ✅ `core/src/strategies/three_layer/` (整个目录)
- ✅ `core/src/strategies/ml_strategy.py`
- ✅ `core/tests/unit/strategies/three_layer/` (整个目录)
- ✅ `core/tests/unit/strategies/test_ml_strategy.py`
- ✅ `core/tests/integration/test_three_layer_backtest.py`
- ✅ `core/tests/integration/test_three_layer_performance.py`
- ✅ `core/tests/integration/test_ml3_lightgbm_workflow.py`
- ✅ `core/tools/train_stock_ranker_lgbm.py`
- ✅ `core/tests/unit/tools/test_train_stock_ranker_lgbm.py`
- ✅ `core/tests/unit/backtest/test_backtest_engine.py::TestBacktestThreeLayer` (测试类)

**已修复的引用**:
- ✅ `src/strategies/__init__.py` - 移除 MLStrategy 导入
- ✅ `src/backtest/backtest_engine.py:392` - Position 导入从 position_manager
- ✅ `src/backtest/parallel_backtester.py:365` - 注释 MLStrategy 引用
- ✅ `src/cli/commands/backtest.py:104` - 添加弃用提示

**验证结果**:
- ✅ 测试收集成功: 3470 个测试 (删除了 38 个旧测试)
- ✅ 无导入错误
- ✅ backtest_engine 测试全部通过 (32/32)

**下一步**: 实现 Phase 1 Day 4 - LabelGenerator

---

### 2026-02-08 - Phase 1 Day 2-3 完成 ✅

**新增的模块**:
- ✅ `core/src/ml/__init__.py` - ML模块初始化
- ✅ `core/src/ml/feature_engine.py` - 特征工程引擎 (500+ 行)
- ✅ `core/tests/unit/ml/__init__.py` - 测试模块初始化
- ✅ `core/tests/unit/ml/test_feature_engine.py` - 单元测试 (450+ 行)
- ✅ `core/examples/feature_engine_demo.py` - 使用示例 (280+ 行)
- ✅ `core/docs/planning/phase1_completion_report.md` - 完整实施报告

**FeatureEngine功能**:
- ✅ Alpha因子计算 (58+ 因子)
- ✅ 技术指标计算 (37+ 指标)
- ✅ 成交量特征 (4+ 特征)
- ✅ 智能缓存机制 (18000+x 加速)
- ✅ 批量计算接口
- ✅ 灵活特征组选择 (alpha/technical/volume/all)

**测试验证**:
- ✅ 单元测试: 19/19 通过
- ✅ 测试覆盖率: 100%
- ✅ 运行时间: 1.9秒
- ✅ 示例代码: 5个场景全部验证通过

**性能指标**:
- ✅ 特征计算: ~0.2秒/5股票
- ✅ 缓存读取: ~0.00001秒
- ✅ 总特征数: 99+ (Alpha 58 + 技术指标 37 + 成交量 4)

**技术亮点**:
- ✅ 完全对齐 ml_system_refactoring_plan.md 设计
- ✅ Pandas 2.0 兼容 (ffill替代fillna(method='ffill'))
- ✅ 健壮的类型处理 (修复isinf类型错误)
- ✅ 统一接口封装 AlphaFactors + TechnicalIndicators

**下一步**: 实现 Phase 1 Day 4 - LabelGenerator

---

**变更记录**:
- v2.2.0 (2026-02-08): 完成 Phase 1 Day 2-3 - FeatureEngine实现
- v2.1.0 (2026-02-08): 完成 Phase 1 Day 1 - 旧模块删除和引用修复
- v2.0.0 (2026-02-08): 重大调整 - 删除三层架构,不考虑向后兼容
- v1.0.0 (2026-02-08): 初版 - 包含向后兼容策略
