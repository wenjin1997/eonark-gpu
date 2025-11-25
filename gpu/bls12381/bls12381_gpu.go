package bls12_381_gpu

import (
	"fmt"
	"log"
	"runtime"
	"time"

	curve "github.com/consensys/gnark-crypto/ecc/bls12-381"
	"github.com/consensys/gnark-crypto/ecc/bls12-381/fp"
	"github.com/consensys/gnark-crypto/ecc/bls12-381/fr"
	"github.com/consensys/gnark-crypto/ecc/bls12-381/kzg"

	icicle_core "github.com/ingonyama-zk/icicle-gnark/v3/wrappers/golang/core"
	icicle_bls12_381 "github.com/ingonyama-zk/icicle-gnark/v3/wrappers/golang/curves/bls12381"
	icicle_msm "github.com/ingonyama-zk/icicle-gnark/v3/wrappers/golang/curves/bls12381/msm"
	icicle_ntt "github.com/ingonyama-zk/icicle-gnark/v3/wrappers/golang/curves/bls12381/ntt"
	icicle_vecops "github.com/ingonyama-zk/icicle-gnark/v3/wrappers/golang/curves/bls12381/vecOps"
	icicle_runtime "github.com/ingonyama-zk/icicle-gnark/v3/wrappers/golang/runtime"
)

func blsProjectiveToGnarkAffine(p icicle_bls12_381.Projective) curve.G1Affine {
	bx := p.X.ToBytesLittleEndian()
	by := p.Y.ToBytesLittleEndian()
	bz := p.Z.ToBytesLittleEndian()

	var ax, ay, az fp.Element
	ax, _ = fp.LittleEndian.Element((*[fp.Bytes]byte)(bx))
	ay, _ = fp.LittleEndian.Element((*[fp.Bytes]byte)(by))
	az, _ = fp.LittleEndian.Element((*[fp.Bytes]byte)(bz))

	var zInv fp.Element
	zInv.Inverse(&az)
	ax.Mul(&ax, &zInv)
	ay.Mul(&ay, &zInv)

	return curve.G1Affine{X: ax, Y: ay}
}

// OnDeviceCommit 使用已在 GPU 的 G1 (SRS) 做 MSM： [p]·G1
// p: 多项式系数（假设是 Montgomery 形式；gnark-crypto/fr 默认就是）
// G1Device: 已在设备端的 G1 bases（例如 pk.deviceInfo.G1Device.G1）
// 返回：kzg.Digest (= curve.G1Affine)
// 注意：此函数不使用预计算，如需使用预计算请调用 OnDeviceCommitWithPrecompute
func OnDeviceCommit(p []fr.Element, G1Device icicle_core.DeviceSlice) (kzg.Digest, icicle_runtime.EIcicleError) {
	// 1) 把标量拷到设备
	host := icicle_core.HostSliceFromElements(p)

	var scalarsDev icicle_core.DeviceSlice
	host.CopyToDevice(&scalarsDev, true)
	defer scalarsDev.Free()

	// 2) 配置 MSM（不使用预计算，保持向后兼容）
	cfg := icicle_msm.GetDefaultMSMConfig()
	cfg.AreScalarsMontgomeryForm = true
	cfg.AreBasesMontgomeryForm = false
	cfg.PrecomputeFactor = 1 // 不使用预计算

	// 3) 运行 MSM（输出 1 个 projective 点）
	out := make(icicle_core.HostSlice[icicle_bls12_381.Projective], 1)
	st := icicle_msm.Msm(scalarsDev, G1Device, &cfg, out)

	if st != icicle_runtime.Success {
		return kzg.Digest{}, st
	}

	// 4) 转成 gnark 的 Affine（= kzg.Digest）
	res := blsProjectiveToGnarkAffine(out[0])

	return kzg.Digest(res), icicle_runtime.Success
}

// OnDeviceCommitWithPrecompute 使用预计算的 bases 做 MSM
// p: 多项式系数
// precomputedBases: 预计算的 bases（DeviceSlice），长度应该匹配 N * PrecomputeFactor
// cfg: MSM 配置（必须与预计算时使用的配置一致）
// 返回：kzg.Digest
func OnDeviceCommitWithPrecompute(p []fr.Element, precomputedBases icicle_core.DeviceSlice, cfg *icicle_core.MSMConfig) (kzg.Digest, icicle_runtime.EIcicleError) {
	// 1) 把标量拷到设备
	host := icicle_core.HostSliceFromElements(p)

	var scalarsDev icicle_core.DeviceSlice
	host.CopyToDevice(&scalarsDev, true)
	defer scalarsDev.Free()

	// 2) 运行 MSM（输出 1 个 projective 点）
	out := make(icicle_core.HostSlice[icicle_bls12_381.Projective], 1)
	st := icicle_msm.Msm(scalarsDev, precomputedBases, cfg, out)

	if st != icicle_runtime.Success {
		return kzg.Digest{}, st
	}

	// 3) 转成 gnark 的 Affine（= kzg.Digest）
	res := blsProjectiveToGnarkAffine(out[0])

	return kzg.Digest(res), icicle_runtime.Success
}

// OnDeviceCommitBatchLRO 在 GPU 上对多条多项式（同一套 G1Lagrange 基点）做 batch MSM。
// 典型用法：一次性对 L/R/O 三个多项式做 KZG commit。
// 要求：
//   - polys 长度 = batchSize（例如 3）
//   - 每个 polys[i] 都是长度相同的 []fr.Element（例如 N = domain0.Cardinality）
//   - G1Lagrange 是长度 >= N 的 DeviceSlice（例如 pk.deviceInfo.G1Device.G1Lagrange.RangeTo(N, false)）
//
// 注意：此函数不使用预计算，如需使用预计算请调用 OnDeviceCommitBatchLROWithPrecompute
func OnDeviceCommitBatchLRO(
	polys [][]fr.Element,
	G1Lagrange icicle_core.DeviceSlice,
) ([]kzg.Digest, icicle_runtime.EIcicleError) {

	// 追踪：函数开始时的内存状态
	printMemoryInfo("Function Start")

	batchSize := len(polys)
	if batchSize == 0 {
		return nil, icicle_runtime.Success
	}

	// 确认所有多项式长度一致
	N := len(polys[0])
	for i := 1; i < batchSize; i++ {
		if len(polys[i]) != N {
			// EIcicleError 是 int 枚举，不能用 struct literal
			// 这里直接返回 InvalidArgument + 日志说明原因
			log.Printf("[OnDeviceCommitBatchLRO] polys have different lengths: N=%d, len(polys[%d])=%d",
				N, i, len(polys[i]))
			return nil, icicle_runtime.InvalidArgument
		}
	}

	// 1) 把 [L, R, O] flatten 成一个大标量数组：L || R || O
	flatten := make([]fr.Element, 0, batchSize*N)
	for i := 0; i < batchSize; i++ {
		flatten = append(flatten, polys[i]...)
	}

	// 追踪：flatten 数组创建后的内存状态
	printMemoryInfo("After Flatten Array Created")

	// 2) HostSlice → DeviceSlice
	// 计算 flatten 的内存大小（Byte），host 和 device 存储同样数量的数据
	// fr.Element(=Fp) 大小为 fp.Bytes
	flattenMemBytes := len(flatten) * fp.Bytes
	fmt.Printf("	OnDeviceCommitBatchLRO() || flatten total elements: %d, per fr.Element: %d bytes, total: %.2f MB\n",
		len(flatten), fp.Bytes, float64(flattenMemBytes)/(1024*1024))

	start_time := time.Now()
	host := icicle_core.HostSliceFromElements(flatten)
	var scalarsDev icicle_core.DeviceSlice

	// 追踪：HostSlice 创建后的内存状态
	printMemoryInfo("After HostSlice Created")

	// 追踪：CopyToDevice 前的内存信息
	printMemoryInfo("Before CopyToDevice")

	host.CopyToDevice(&scalarsDev, true)
	defer scalarsDev.Free()

	// 打印 CopyToDevice 后的内存信息
	printMemoryInfo("After CopyToDevice")

	elapsed := time.Since(start_time)
	fmt.Printf("	OnDeviceCommitBatchLRO() || icicle_core.HostSliceFromElements() 耗时: %.6f ms\n", float64(elapsed.Nanoseconds())/1e6)

	// 3) MSMConfig：开启 batch + 共享 bases（不使用预计算，保持向后兼容）
	cfg := icicle_msm.GetDefaultMSMConfig()
	cfg.BatchSize = int32(batchSize)
	cfg.ArePointsSharedInBatch = true
	cfg.AreScalarsMontgomeryForm = true
	cfg.AreBasesMontgomeryForm = false
	cfg.PrecomputeFactor = 1 // 不使用预计算

	// 5) 准备结果 HostSlice，长度 = batchSize
	out := make(icicle_core.HostSlice[icicle_bls12_381.Projective], batchSize)

	// 6) 调用 MSM：直接使用原始基点（不使用预计算）
	start_time = time.Now()
	st := icicle_msm.Msm(scalarsDev, G1Lagrange, &cfg, out)
	elapsed = time.Since(start_time)
	fmt.Printf("	OnDeviceCommitBatchLRO() || icicle_msm.Msm() 耗时: %.6f ms\n", float64(elapsed.Nanoseconds())/1e6)

	if st != icicle_runtime.Success {
		return nil, st
	}

	// 7) Projective → gnark Affine（= kzg.Digest）
	start_time = time.Now()
	res := make([]kzg.Digest, batchSize)
	for i := 0; i < batchSize; i++ {
		aff := blsProjectiveToGnarkAffine(out[i])
		res[i] = kzg.Digest(aff)
	}
	elapsed = time.Since(start_time)
	fmt.Printf("	OnDeviceCommitBatchLRO() || blsProjectiveToGnarkAffine() 耗时: %.6f ms\n", float64(elapsed.Nanoseconds())/1e6)

	return res, icicle_runtime.Success
}

// OnDeviceCommitBatchLROWithPrecompute 使用预计算的 bases 做 batch MSM
// polys: 多项式数组
// precomputedBases: 预计算的 bases（DeviceSlice），长度应该匹配 N * PrecomputeFactor
// cfg: MSM 配置（必须与预计算时使用的配置一致，且 BatchSize 和 ArePointsSharedInBatch 已设置）
// 返回：kzg.Digest 数组
func OnDeviceCommitBatchLROWithPrecompute(
	polys [][]fr.Element,
	precomputedBases icicle_core.DeviceSlice,
	cfg *icicle_core.MSMConfig,
) ([]kzg.Digest, icicle_runtime.EIcicleError) {
	batchSize := len(polys)
	if batchSize == 0 {
		return nil, icicle_runtime.Success
	}

	// 确认所有多项式长度一致
	N := len(polys[0])
	for i := 1; i < batchSize; i++ {
		if len(polys[i]) != N {
			log.Printf("[OnDeviceCommitBatchLROWithPrecompute] polys have different lengths: N=%d, len(polys[%d])=%d",
				N, i, len(polys[i]))
			return nil, icicle_runtime.InvalidArgument
		}
	}

	// 1) 把 [L, R, O] flatten 成一个大标量数组：L || R || O
	flatten := make([]fr.Element, 0, batchSize*N)
	for i := 0; i < batchSize; i++ {
		flatten = append(flatten, polys[i]...)
	}

	// 2) HostSlice → DeviceSlice
	host := icicle_core.HostSliceFromElements(flatten)
	var scalarsDev icicle_core.DeviceSlice
	host.CopyToDevice(&scalarsDev, true)
	defer scalarsDev.Free()

	// 3) 准备结果 HostSlice，长度 = batchSize
	out := make(icicle_core.HostSlice[icicle_bls12_381.Projective], batchSize)

	// 4) 调用 MSM：使用预计算的基点
	start_time := time.Now()
	st := icicle_msm.Msm(scalarsDev, precomputedBases, cfg, out)
	elapsed := time.Since(start_time)
	fmt.Printf("	OnDeviceCommitBatchLROWithPrecompute() || icicle_msm.Msm() 耗时: %.6f ms\n", float64(elapsed.Nanoseconds())/1e6)

	if st != icicle_runtime.Success {
		return nil, st
	}

	// 5) Projective → gnark Affine（= kzg.Digest）
	res := make([]kzg.Digest, batchSize)
	for i := 0; i < batchSize; i++ {
		aff := blsProjectiveToGnarkAffine(out[i])
		res[i] = kzg.Digest(aff)
	}

	return res, icicle_runtime.Success
}

func OnDeviceOpen(p []fr.Element, point fr.Element, base icicle_core.DeviceSlice) (kzg.OpeningProof, icicle_runtime.EIcicleError) {
	var proof kzg.OpeningProof

	// 1) 声明值（CPU 做即可，代价可忽略）
	proof.ClaimedValue = eval(p, point)

	// 2) 构造 H(X) = (p(X)-p(point)) / (X-point)
	_p := make([]fr.Element, len(p))
	copy(_p, p)
	h := dividePolyByXminusA(_p, proof.ClaimedValue, point)

	// 3) 对 H 做一次设备端承诺：commit(H)
	//    注意 bases 需要与标量长度一致，这里对子片到 len(h)
	subBase := base.RangeTo(len(h), false)
	dig, st := OnDeviceCommit(h, subBase)
	if st != icicle_runtime.Success {
		return kzg.OpeningProof{}, st
	}

	// 4) 组装返回值
	proof.H = kzg.Digest(dig) // Digest 是 G1Affine 的别名
	return proof, icicle_runtime.Success
}

func eval(p []fr.Element, point fr.Element) fr.Element {
	var res fr.Element
	n := len(p)
	if n == 0 {
		return res // 0
	}
	res.Set(&p[n-1])
	for i := n - 2; i >= 0; i-- {
		res.Mul(&res, &point).Add(&res, &p[i])
	}
	return res
}

func dividePolyByXminusA(f []fr.Element, fa, a fr.Element) []fr.Element {
	// f <- f - f(a)
	f[0].Sub(&f[0], &fa)

	var t fr.Element
	for i := len(f) - 2; i >= 0; i-- {
		t.Mul(&f[i+1], &a)
		f[i].Add(&f[i], &t)
	}
	return f[1:]
}

// 把 fr.Element 变成 icicle NTT 需要的 CosetGen 表示（uint32 limbs*2）
func CosetGenToIcicle(g fr.Element) (out [fr.Limbs * 2]uint32) {
	bits := g.Bits() // [fr.Limbs]uint64
	limbs := icicle_core.ConvertUint64ArrToUint32Arr(bits[:])
	copy(out[:], limbs[:fr.Limbs*2])
	return
}

func INttOnDevice(aDev icicle_core.DeviceSlice) icicle_runtime.EIcicleError {
	cfg := icicle_ntt.GetDefaultNttConfig()
	cfg.Ordering = icicle_core.KNN
	return icicle_ntt.Ntt(aDev, icicle_core.KInverse, &cfg, aDev)
}

// NttOnDevice: 正向NTT（就地 in-place）。如果 isCoset=true 则做 coset-NTT。
// 约定：输入/输出都在 Montgomery 表示。
func NttOnDevice(aDev icicle_core.DeviceSlice) icicle_runtime.EIcicleError {

	cfg := icicle_ntt.GetDefaultNttConfig()
	// KMN = 常用的正向排列（匹配 gnark/icicle 的用法）
	cfg.Ordering = icicle_core.KNN
	return icicle_ntt.Ntt(aDev, icicle_core.KForward, &cfg, aDev)
}

// VecMulOnDevice: 逐元素乘法 acc = acc * other（模 p），就地写回 acc。
// 注意：icicle 的 vecOps 期望“非 Montgomery”表示；如果你的数据现在是 Montgomery，
// 请先调用 MontConvOnDevice(s, false) 转出，再做乘法，必要时乘完再转回。
func VecMulOnDevice(acc, other icicle_core.DeviceSlice) icicle_runtime.EIcicleError {

	vecCfg := icicle_core.DefaultVecOpsConfig()
	return icicle_vecops.VecOp(acc, other, acc, vecCfg, icicle_core.Mul)
}

// MontConvOnDevice: 标量数组的 Montgomery <-> 非Montgomery 转换（就地）
// into=true  => ToMontgomery
// into=false => FromMontgomery
func MontConvOnDevice(s icicle_core.DeviceSlice, into bool) icicle_runtime.EIcicleError {
	if into {
		return icicle_bls12_381.ToMontgomery(s)
	}
	return icicle_bls12_381.FromMontgomery(s)
}

// getCPUMemoryInfo 获取当前 CPU 内存使用情况（MiB）
func getCPUMemoryInfo() (allocated, total, sys uint64) {
	var m runtime.MemStats
	runtime.ReadMemStats(&m)

	// allocated: 当前分配的堆内存
	allocated = m.Alloc / 1024 / 1024 // 转换为 MiB

	// total: 从系统分配的总内存
	total = m.TotalAlloc / 1024 / 1024 // 转换为 MiB

	// sys: 从系统获取的内存
	sys = m.Sys / 1024 / 1024 // 转换为 MiB

	return allocated, total, sys
}

// printMemoryInfo 打印 GPU 和 CPU 内存信息
func printMemoryInfo(label string) {
	// GPU 内存
	if mem, err := icicle_runtime.GetAvailableMemory(); err == icicle_runtime.Success && mem != nil {
		used := mem.Total - mem.Free
		pct := 0.0
		if mem.Total > 0 {
			pct = (float64(used) / float64(mem.Total)) * 100.0
		}
		fmt.Printf("		[%s] GPU memory: used=%.0f MiB / total=%.0f MiB (%.1f%%)\n",
			label, float64(used)/1024.0/1024.0, float64(mem.Total)/1024.0/1024.0, pct)
	} else {
		fmt.Printf("		[%s] GPU memory: <unavailable> (err=%v)\n", label, err)
	}

	// CPU 内存
	allocated, total, sys := getCPUMemoryInfo()
	fmt.Printf("		[%s] CPU memory: allocated=%d MiB, total_allocated=%d MiB, sys=%d MiB\n",
		label, allocated, total, sys)
}
